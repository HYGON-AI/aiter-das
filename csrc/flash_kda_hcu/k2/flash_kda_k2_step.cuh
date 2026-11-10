// SPDX-License-Identifier: MIT
//
// K2 的 chunk 体（split-step）：处理一个 chunk，并在尾部发布下一代的 LDS 直写。
// 发射序、等待立即数与 barrier 顺序见函数内注释；改动必须同步重推"在飞"账。

#ifndef FLASH_KDA_K2_STEP_CUH
#define FLASH_KDA_K2_STEP_CUH

#include "flash_kda_k2_common.cuh"
#include "flash_kda_k2_load.cuh"

namespace
{

    template <bool FullChunks>
    __device__ __forceinline__ void kda_k2_step(
        int tid,
        int64_t next_workspace_chunk_index,
        bool has_next,
        const u16 *ws_kd_a,
        const u16 *ws_qd_a,
        const u16 *ws_krgt_a, // 合并区（kr|gt）全局基址：发布下一代用
        u16 *s_kd_next,
        u16 *s_qd_next,
        const u16 *kd_a,
        const u16 *qd_a,
        const float *gt_lds,
        u16 *kr_a, // 合并区 LDS 基址：本代读 + 发布下一代
        const u16 *inv_a,
        const u16 *mqk_a,
        const u16 *v,
        const float *beta_sigmoid,
        u16 *out,
        float h_reg[kKeyDim / 16][4],
        int col0,
        int batch_index,
        int head,
        int token_base,
        int heads,
        int tokens)
    {
        const int lane = tid & 63;
        const int row = lane & 15;
        const int group = lane >> 4;
        const int vcol = col0 + row;
        constexpr int kKt = kKeyDim / 16;
        constexpr int kWaves = kK2Waves;

        // ===== 取数段 (0)：等本代 kd/qd 的 LDS 直写落地，再由 CTA barrier 发布 =====
        // 本代 kd/qd 是序言或上一轮 (3) 发出的 `buffer_load … lds`，第一次 ds_read 之前
        // 必须落地。`token_base` 与 `has_next` 都是 CTA 内 uniform 条件，立即数选择不破坏
        // barrier 一致性。
        //
        // 在飞请求（老 → 新）：
        //   * 首块（token_base == 0）：序言一次发 4 条 = kd/qd(c)×2 → kr|gt(c)×2
        //     ⇒ `vmcnt(2)` 退掉较老的 kd/qd 两条，保留 kr|gt 两条；
        //   * 稳态：kd/qd(c+1)×2 → 上轮 store×4 → kr|gt(c+1)×2
        //     ⇒ `vmcnt(6)` 退掉 kd/qd 两条，保留 store×4 与 kr|gt×2。
        // kr|gt 的落地在它被读取之前另有一次等待（见本函数中段），此处不收口。
        // 直写计在 VMEM 域，故只用 vmcnt；vmcnt 是本 wave 私有的，跨 wave 可见性靠
        // 紧随的 CTA barrier。
        if (token_base == 0)
            kda_c16_asm::wait_vmcnt_only<2>();
        else
            kda_c16_asm::wait_vmcnt_only<6>();
        // kd/qd 的 LDS 直写由 4 个 wave 协作写同一块：各 wave 完成自己的请求后由 barrier
        // 发布**当前 kd/qd 的结果**给全体 wave，然后才 ds_read。
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_barrier" ::: "memory");
        __builtin_amdgcn_sched_barrier(0);

        // ===== 本代 V 的全局读（在 kd/qd ds_read 之前发出）=====
        //   谓词用 `FullChunks || token_s < tokens`：满块档编译期真，尾块档无效 lane
        //   落到最后一个有效 token，避免越过分配边界的 V 读。
        unsigned int v_raw[4];
        {
            const vec4_u32 rsrc_v = kda_c16_make_buffer_rsrc(v);
            const unsigned int v_soff = static_cast<unsigned int>(
                ((static_cast<int64_t>(batch_index) * tokens + token_base) * heads + head) *
                kValueDim * 2);
#pragma unroll
            for (int s = 0; s < 4; ++s)
            {
                const int token_s = token_base + group + 4 * s;
                // [安全修正] 无效 lane 夹到最后一个有效 token，**仍发 4 条 V 读**：
                // 数值上随后被 u 的 valid_s 门置 0；等待计数按每 lane 4 条推导，因此不能少发。
                const int token_rel = (FullChunks || token_s < tokens)
                                          ? (group + 4 * s)
                                          : (tokens - 1 - token_base);
                kda_c16_asm::buffer_load_ushort(
                    v_raw[s], rsrc_v, v_soff,
                    (token_rel * heads * kValueDim + vcol) * 2);
            }
        }
        // ===== 取数段 (1)：ds_read kd/qd(c) → 寄存器（lgkmcnt 记账，只发不等）=====
        //   gt/kr 的 LDS 读后置到第一组 MMAC 之后（缩短寄存器存活期，并把 LDS 读错开成两批）。
        unsigned long long rk[kKt], rq[kKt];
        vec4_fp32 gt_reg[8];
        const u16 *const kd_lane = kd_a + kda_c16_kdqd_cons_u16(row, group);
        const u16 *const qd_lane = qd_a + kda_c16_kdqd_cons_u16(row, group);
        // 先发 8 条 kd，再发 8 条 qd（每 chunk 每 wave 共 16 条 `ds_read_b64`）。
#pragma unroll
        for (int kt = 0; kt < kKt; ++kt)
        {
            const unsigned int kd_lds = static_cast<unsigned int>(
                reinterpret_cast<uintptr_t>(kd_lane + kt * kTile * kTile));
            kda_c16_asm::ds_read_b64(kd_lds, rk[kt]);
        }
#pragma unroll
        for (int kt = 0; kt < kKt; ++kt)
        {
            const unsigned int qd_lds = static_cast<unsigned int>(
                reinterpret_cast<uintptr_t>(qd_lane + kt * kTile * kTile));
            kda_c16_asm::ds_read_b64(qd_lds, rq[kt]);
        }
        // ===== 取数段 (2)：本代全局寄存器操作数（vmcnt 记账，只发不等）=====
        // 每个请求的立即数都要与下面等待点的在飞账一致（见各等待点注释）。
        unsigned long long kr_reg[8];
        unsigned long long inv_reg, mqk_reg;
        float beta_reg[4];
        {
            // inv/mqk/beta 直接读全局；kr 见下方从 s_krgt 的 LDS 读。
            const vec4_u32 rsrc_inv = kda_c16_make_buffer_rsrc(inv_a);
            const vec4_u32 rsrc_mqk = kda_c16_make_buffer_rsrc(mqk_a);
            const vec4_u32 rsrc_beta = kda_c16_make_buffer_rsrc(beta_sigmoid);
            const int packed_voff = (row * 4 + group) * 8;
#pragma unroll
            for (int s = 0; s < 4; ++s)
                kda_c16_asm::buffer_load_dwordx1(beta_reg[s], rsrc_beta, 0u, (group + 4 * s) * 4);
            kda_c16_asm::buffer_load_dwordx2(inv_reg, rsrc_inv, 0u, packed_voff);
            kda_c16_asm::buffer_load_dwordx2(mqk_reg, rsrc_mqk, 0u, packed_voff);
        }

        // ===== 取数段 (3)：只发下一代的 kd/qd LDS 直写（排在本代 ds_read 之后）=====
        // 下一代的 kr|gt 在循环尾发布（单缓冲 ⇒ 必须等本代读结束）。
        if (has_next)
            issue_kdqd_to_lds<kWaves>(tid, next_workspace_chunk_index, ws_kd_a, ws_qd_a, s_kd_next,
                                      s_qd_next);

        // (4) 第一组 MMAC 消费 rk/rq 前，收口本代 16 条 LDS 读（8 kd + 8 qd）。
        // 下一代的 kd/qd 直写计在 VMEM 域，不占 lgkmcnt，故 `lgkmcnt(0)` 不动它。
        __builtin_amdgcn_sched_barrier(0);
        kda_c16_asm::wait_lgkmcnt_only<0>();
        __builtin_amdgcn_sched_barrier(0);

        // ===== 第一组 MMAC：kh^T = h^T·kd^T / oq^T = h^T·qd^T（消费 rk/rq）=====
        vec4_fp32 kh_acc{0, 0, 0, 0};
        vec4_fp32 oq_acc{0, 0, 0, 0};
#pragma unroll
        for (int kt = 0; kt < kKt; ++kt)
        {
            const auto a_k = __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, rk[kt]);
            const auto a_q = __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, rq[kt]);
            flash_kda_k2_fragments::vec4_bf16 b_h{};
#pragma unroll
            for (int s = 0; s < 4; ++s)
                b_h[s] = flash_kda_k2_fragments::float_to_bf16_rne_fast(h_reg[kt][s]);
            // 每条 MMAC 是一个 volatile asm 块 ⇒ 这里的发射顺序 = 源码顺序。
            kda_c16_asm::mmac_bf16(kh_acc, b_h, a_k);
            kda_c16_asm::mmac_bf16(oq_acc, b_h, a_q);
        }

        // ===== gt/kr(c) 的 LDS 读之前：收口本代 kr|gt 的搬运，再做跨 wave 发布 =====
        // 本代 kr|gt 由上一轮循环尾发出，顶部故意把它留在飞，这里才收口：
        // 在飞 18 条时有 next ⇒ `vmcnt(12)` 退掉 store×4 + kr|gt×2；无 next 时 16 条 ⇒ `vmcnt(10)`。
        // 只发 vmcnt（不动 LGKM，保住其他 LDS 读的在飞），随后 barrier 让全体 wave 的
        // kr|gt 切片对本 wave 的 ds_read 可见。
        __builtin_amdgcn_sched_barrier(0);
        if (has_next)
            kda_c16_asm::wait_vmcnt_only<12>();
        else
            kda_c16_asm::wait_vmcnt_only<10>();
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_barrier" ::: "memory");
        __builtin_amdgcn_sched_barrier(0);
        // 先读 gt 的 i=0..3（pair 0-1），另一半在 M2 之后
#pragma unroll
        for (int i = 0; i < 4; ++i)
        {
            const unsigned int gt_addr = static_cast<unsigned int>(
                reinterpret_cast<uintptr_t>(gt_lds + i * 16 + group * 4));
            kda_c16_asm::ds_read_b128(gt_addr, gt_reg[i]);
        }
        {
            const unsigned int kr_lds_base = static_cast<unsigned int>(
                reinterpret_cast<uintptr_t>(kr_a) + kr_voff(flash_kda_state_layout::natural_kr_row(row), group));
#pragma unroll
            for (int tile = 0; tile < 4; ++tile) // A 半：tile 0..3（pair 0-1）
                kda_c16_asm::ds_read_b64(kr_lds_base + static_cast<unsigned int>(tile) * 512u,
                                         kr_reg[tile]);
        }

        // ===== vmcnt：首次消费 beta/v 之前 =====
        // 此刻在飞的 VMEM 请求 = (2) 的 beta4 + v4 + inv1 + mqk1 + (3) kd/qd 两条直写 = 12。
        // 把"收 beta/v 的 VM 等待"与 8 个 32 位分量放进同一个 ASM：
        //   wait 后原值透传（"+v" 读改写）⇒ `u=(v-kh)*beta` 及后续打包/MMAC 通过**寄存器依赖**
        //   连到这次等待，而不只依赖 memory clobber。lgkmcnt(15) = 不等 LDS。
        __builtin_amdgcn_sched_barrier(0);
        // 首次消费 beta/v/inv 前：VM 发射序（老→新）
        //   = v4 → beta4 → inv1 → mqk1 → 下一代 kd/qd 两条直写
        //   ⇒ 有 next 保留 **3**（mqk + 两条下一代直写），保证 beta/v/inv 就绪；
        //     末块没有直写 ⇒ 保留 **1**（只留 mqk）。
        //   结构：纯等待在分支里（CTA-uniform 的 has_next）；relay 必须在分支外、
        //   且取较宽值 3（前序等待已把在飞压到 ≤3，故 relay 的等待自动 no-op），
        //   它只负责把寄存器依赖绑到消费者。
        __builtin_amdgcn_sched_barrier(0);
        if (has_next)
            kda_c16_asm::wait_vmcnt_only<3>();
        else
            kda_c16_asm::wait_vmcnt_only<1>();
        kda_c16_asm::ready8<3, 15>(beta_reg[0], beta_reg[1], beta_reg[2], beta_reg[3],
                                   v_raw[0], v_raw[1], v_raw[2], v_raw[3]);
        __builtin_amdgcn_sched_barrier(0);
        __builtin_amdgcn_sched_barrier(0);
        // ===== 第二组：u / U^T / out^T / h_reg 更新（消费 v/beta/inv/mqk/kr/gt 寄存器）=====
        float u[4] = {};
#pragma unroll
        for (int s = 0; s < 4; ++s)
        {
            const int token_s = token_base + group + s * 4;
            if constexpr (FullChunks)
            {
                const float value = bf16_to_float_16(static_cast<u16>(v_raw[s] & 0xffffu));
                u[s] = (value - kh_acc[s]) * beta_reg[s];
            }
            else
            {
                const bool valid_s = token_s < tokens;
                const float value =
                    valid_s ? bf16_to_float_16(static_cast<u16>(v_raw[s] & 0xffffu)) : 0.0f;
                u[s] = (value - kh_acc[s]) * (valid_s ? beta_reg[s] : 0.0f);
            }
        }
        u16 u_bf[4];
#pragma unroll
        for (int s = 0; s < 4; ++s)
            u_bf[s] = float_to_bf16_16(u[s]);
        flash_kda_k2_fragments::vec4_bf16 a_u{};
#pragma unroll
        for (int s = 0; s < 4; ++s)
            a_u[s] = u_bf[s];
        const auto a_inv = __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, inv_reg);
        // asm FP16 MMAC（U）：顺序固定，wait 在其首消费者之前
        vec4_fp32 U_acc{0, 0, 0, 0};
        kda_c16_asm::mmac_bf16(U_acc, a_u, a_inv);
        float U_float[4];
        u16 U_f16[4];
        u16 U_bf[4];
#pragma unroll
        for (int s = 0; s < 4; ++s)
        {
            U_float[s] = U_acc[s];
            U_f16[s] = float_to_f16_16(U_float[s]);
            U_bf[s] = float_to_bf16_16(U_float[s]);
        }
        vec4_fp32 output_acc = oq_acc;
        // ===== 发 B 半的 gt/kr LDS 读（M2-1 之后、mqk 消费之前）=====
        // A 半先发、B 半后发 ⇒ LDS 读顺序仍是 [A 8 条][B 8 条]，后面的 `lgkmcnt(8)`
        // 因此正好"退 A、留 B"。
        __builtin_amdgcn_sched_barrier(0);
        {
            const unsigned int kr_lds_base_b = static_cast<unsigned int>(
                reinterpret_cast<uintptr_t>(kr_a) + kr_voff(flash_kda_state_layout::natural_kr_row(row), group));
#pragma unroll
            for (int i = 4; i < 8; ++i)
            {
                const unsigned int gt_addr = static_cast<unsigned int>(
                    reinterpret_cast<uintptr_t>(gt_lds + i * 16 + group * 4));
                kda_c16_asm::ds_read_b128(gt_addr, gt_reg[i]);
            }
#pragma unroll
            for (int tile = 4; tile < 8; ++tile)
                kda_c16_asm::ds_read_b64(kr_lds_base_b + static_cast<unsigned int>(tile) * 512u,
                                         kr_reg[tile]);
        }
        // 消费 mqk 前：VM 在飞（老→新）= mqk1 → 下一代 kd1 → 下一代 qd1
        //   ⇒ 有 next 留 2（两条下一代直写继续飞），末块留 0。
        // 纯等待放在分支里；relay 在分支外取较宽值 2（在飞已 ≤2 ⇒ 自动 no-op），只绑依赖。
        __builtin_amdgcn_sched_barrier(0);
        if (has_next)
            kda_c16_asm::wait_vmcnt_only<2>();
        else
            kda_c16_asm::wait_vmcnt_only<0>();
        kda_c16_asm::ready1<2, 15>(mqk_reg);
        __builtin_amdgcn_sched_barrier(0);
        __builtin_amdgcn_sched_barrier(0);
        const auto a_mqk = __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, mqk_reg);
        flash_kda_k2_fragments::vec4_bf16 a_U_f16{};
#pragma unroll
        for (int s = 0; s < 4; ++s)
            a_U_f16[s] = U_bf[s];
        // asm FP16 MMAC：保证输出 MMAC 排在 M3 的 8 条之前
        kda_c16_asm::mmac_bf16(output_acc, a_U_f16, a_mqk);

        // ===== M3 取数等待：只等 A 半的 LDS 读 =====
        // 此刻 LGKM 在飞 = A 半 8 条 + B 半 8 条；`lgkmcnt(8)` 退掉 A 半、B 半继续在飞
        // （计数降到不大于 N 才放行），随后先做 M3 的 pair 0-1。
        __builtin_amdgcn_sched_barrier(0);
        kda_c16_asm::wait_lgkmcnt_only<8>();
        __builtin_amdgcn_sched_barrier(0);
#pragma unroll
        for (int pair = 0; pair < 2; ++pair)
        {
            const auto a_kr0 =
                __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, kr_reg[pair * 2]);
            const auto a_kr1 =
                __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, kr_reg[pair * 2 + 1]);
            flash_kda_k2_fragments::vec4_bf16 a_U_bf{};
#pragma unroll
            for (int s = 0; s < 4; ++s)
                a_U_bf[s] = U_bf[s];
            // 8 条 MMAC 按 pair 顺序固定；其后的 state 更新消费这些输出。
            vec4_fp32 update0{0, 0, 0, 0};
            vec4_fp32 update1{0, 0, 0, 0};
            kda_c16_asm::mmac_bf16(update0, a_U_bf, a_kr0);
            kda_c16_asm::mmac_bf16(update1, a_U_bf, a_kr1);
            const vec4_fp32 &d0 = gt_reg[pair * 2];
            const vec4_fp32 &d1 = gt_reg[pair * 2 + 1];
            h_reg[pair * 2][0] = d0[0] * h_reg[pair * 2][0] + update0[0];
            h_reg[pair * 2][1] = d0[1] * h_reg[pair * 2][1] + update0[1];
            h_reg[pair * 2][2] = d0[2] * h_reg[pair * 2][2] + update0[2];
            h_reg[pair * 2][3] = d0[3] * h_reg[pair * 2][3] + update0[3];
            h_reg[pair * 2 + 1][0] = d1[0] * h_reg[pair * 2 + 1][0] + update1[0];
            h_reg[pair * 2 + 1][1] = d1[1] * h_reg[pair * 2 + 1][1] + update1[1];
            h_reg[pair * 2 + 1][2] = d1[2] * h_reg[pair * 2 + 1][2] + update1[2];
            h_reg[pair * 2 + 1][3] = d1[3] * h_reg[pair * 2 + 1][3] + update1[3];
        }

        // A 半算完 ⇒ 收口 B 半（此时在飞只剩它的 8 条），再做 pair 2-3
        __builtin_amdgcn_sched_barrier(0);
        kda_c16_asm::wait_lgkmcnt_only<0>();
        __builtin_amdgcn_sched_barrier(0);
#pragma unroll
        for (int pair = 2; pair < kKeyDim / 32; ++pair)
        {
            const auto a_kr0 =
                __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, kr_reg[pair * 2]);
            const auto a_kr1 =
                __builtin_bit_cast(flash_kda_k2_fragments::vec4_bf16, kr_reg[pair * 2 + 1]);
            flash_kda_k2_fragments::vec4_bf16 a_U_bf{};
#pragma unroll
            for (int s = 0; s < 4; ++s)
                a_U_bf[s] = U_bf[s];
            const vec4_fp32 update0 = flash_kda_k2_fragments::opus_mmac_bf16(
                a_U_bf, a_kr0, vec4_fp32{0, 0, 0, 0});
            const vec4_fp32 update1 = flash_kda_k2_fragments::opus_mmac_bf16(
                a_U_bf, a_kr1, vec4_fp32{0, 0, 0, 0});
            const vec4_fp32 &d0 = gt_reg[pair * 2];
            const vec4_fp32 &d1 = gt_reg[pair * 2 + 1];
            h_reg[pair * 2][0] = d0[0] * h_reg[pair * 2][0] + update0[0];
            h_reg[pair * 2][1] = d0[1] * h_reg[pair * 2][1] + update0[1];
            h_reg[pair * 2][2] = d0[2] * h_reg[pair * 2][2] + update0[2];
            h_reg[pair * 2][3] = d0[3] * h_reg[pair * 2][3] + update0[3];
            h_reg[pair * 2 + 1][0] = d1[0] * h_reg[pair * 2 + 1][0] + update1[0];
            h_reg[pair * 2 + 1][1] = d1[1] * h_reg[pair * 2 + 1][1] + update1[1];
            h_reg[pair * 2 + 1][2] = d1[2] * h_reg[pair * 2 + 1][2] + update1[2];
            h_reg[pair * 2 + 1][3] = d1[3] * h_reg[pair * 2 + 1][3] + update1[3];
        }

        // ===== 写回本 chunk 的 out（4 个 bf16 元素，地址在此计算）=====
        {
            const vec4_u32 rsrc_out = kda_c16_make_buffer_rsrc(out);
            const unsigned int out_soff = static_cast<unsigned int>(
                ((static_cast<int64_t>(batch_index) * tokens + token_base) * heads + head) *
                kValueDim * 2);
#pragma unroll
            for (int s = 0; s < 4; ++s)
            {
                const int token_s = token_base + group + 4 * s;
                if (FullChunks || token_s < tokens)
                {
                    const unsigned int bits =
                        static_cast<unsigned int>(float_to_bf16_16(output_acc[s]));
                    kda_c16_asm::buffer_store_short(
                        bits, rsrc_out, out_soff,
                        ((group + 4 * s) * heads * kValueDim + vcol) * 2);
                }
            }
        }

        // ===== 循环尾：覆盖单缓冲 s_krgt 前先收口本代读，再发布下一代 =====
        // 单缓冲约束：本代 kr|gt 的 LDS 读必须全部完成（`lgkmcnt(0)`），并且全体 wave
        // 都越过 CTA barrier（既建立"读完"的会合，也保证覆盖对彼此可见），之后才能写入
        // 下一代的 4608 B（kr 4096 + gt 512，每 wave 两条请求）。
        // 这些请求的落地在下一轮读取 kr|gt 之前收口（见本函数中段的 vmcnt(12/10)），
        // 本条不新增等待。
        __builtin_amdgcn_sched_barrier(0);
        kda_c16_asm::wait_lgkmcnt_only<0>();
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_barrier" ::: "memory"); // C: 可见性会合 + 保护单缓冲 WAR
        __builtin_amdgcn_sched_barrier(0);
        if (has_next)
            issue_krgt_to_lds<kWaves>(tid, next_workspace_chunk_index, ws_krgt_a, kr_a);
    }

} // namespace

#endif // FLASH_KDA_K2_STEP_CUH
