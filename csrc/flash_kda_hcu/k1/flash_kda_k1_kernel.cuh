// SPDX-License-Identifier: MIT
//
// K1 的设备侧实现：定长（含尾块）与 packed 变长共用一个 kernel 模板。
// kernel 用 `Metadata` 参数包区分 FixedTailInfo / VarlenInfo，host 在下方 TU 选实例。

#ifndef FLASH_KDA_K1_KERNEL_CUH
#define FLASH_KDA_K1_KERNEL_CUH

// SPDX-License-Identifier: MIT
#include "flash_kda_k1.h"
#include "flash_kda_k1_layout.cuh"
#include "flash_kda_k1_utils.cuh"
#include "flash_kda_varlen_metadata.cuh"

#include <ATen/hip/HIPContext.h>
#include <hip/hip_bf16.h>
#include <hip/hip_runtime.h>

#include <cmath>
#include <limits>
#include <type_traits>

using namespace kda_peer;

namespace
{

    using peer_u16 = unsigned short;

    // 目标 C16 workspace 的常量（与 kda_c16_hcu.cu 一一对应）。
    constexpr int kKdqdStrideU16 = 2 * kChunk * kDim;                 // 4096 u16 = 8 KiB
    constexpr int kQdOffsetU16 = kChunk * kDim;                       // 2048 u16 = 4 KiB
    constexpr int kDecayOffsetU16 = kChunk * kDim;                    // 2048 u16 = 4096 B
    constexpr int kKrgtStrideU16 = kDecayOffsetU16 + kChunk * kChunk; // 2304 u16 = 4608 B

    __device__ __forceinline__ peer_u16 bf16_value_bits(at::BFloat16 value)
    {
        peer_u16 bits;
        __builtin_memcpy(&bits, &value, sizeof(bits));
        return bits;
    }

    // bf16 位值 → fp16 位值（bf16→float 精确，随后一次 fp16 RNE）。
    __device__ __forceinline__ peer_u16 bf16_bits_to_f16_bits(peer_u16 bf16_bits)
    {
        const unsigned int f32_bits = static_cast<unsigned int>(bf16_bits) << 16;
        float value;
        __builtin_memcpy(&value, &f32_bits, sizeof(value));
        const __half half = __float2half_rn(value);
        peer_u16 bits;
        __builtin_memcpy(&bits, &half, sizeof(bits));
        return bits;
    }

    __device__ __forceinline__ peer_u16 bf16_value_to_f16_bits(at::BFloat16 value)
    {
        return bf16_bits_to_f16_bits(bf16_value_bits(value));
    }

    // 一个 CTA 负责一个 (sequence/head lane, 16-token chunk)；输入保持
    // 公开的 [B,T,H,D] 布局，输出按 lane-major 排布供常驻 K2 使用。
    // 尾部 Metadata 参数包：
    //   * 空包 → 旧的固定 aligned 实例，kernarg 列表与之前逐字相同；
    //   * 单个 VarlenInfo → 变长 masked 实例（读 chunk_info，尾块按 valid_tokens 屏蔽）。
    // 通过 constexpr(kMasked) 选择，编译期消失，不引入运行期分支或额外 feature 开关。
    template <bool HasBias, bool BetaBf16, bool BetaFp32, typename... Metadata>
    __global__ __launch_bounds__(kThreads) void kda_k1_kernel(
        const at::BFloat16 *q,
        const at::BFloat16 *k,
        const at::BFloat16 *g,
        const void *beta,
        const float *A_log,
        const float *dt_bias,
        peer_u16 *ws_kd,
        peer_u16 *ws_kr,
        peer_u16 *ws_inv,
        peer_u16 *ws_mqk,
        float *beta_sigmoid,
        int tokens,
        int heads,
        int chunks,
        float scale,
        float gate_scale_log2,
        Metadata... metadata)
    {
        constexpr bool kMasked = sizeof...(Metadata) > 0;
        // masked 有两种：packed 变长（VarlenInfo）与定长尾块（FixedTailInfo）。
        // 只有前者会改写“地址选择”（workspace 落点与输入 token 基址），后者与 aligned
        // 实例共用 batch-major 布局，只是最后一个 chunk 的 valid_tokens < 16。
        constexpr bool kVarlen =
            (std::is_same_v<Metadata, VarlenInfo> || ...);
        VarlenInfo varlen_info{nullptr, 0};
        int fixed_tail_tokens = 0;
        if constexpr (kVarlen)
            varlen_info = std::get<0>(std::tuple<Metadata...>(metadata...));
        if constexpr (kMasked && !kVarlen)
            fixed_tail_tokens = std::get<0>(std::tuple<Metadata...>(metadata...)).tokens;
        // 前缀与 packed Q/K 共用同一块 8 KiB LDS。
        __shared__ PrefixQKStorage prefix_qk_storage;
        float *prefix_log2 = prefix_qk_storage.prefix_log2;
        at::BFloat16 *q_decayed = reinterpret_cast<at::BFloat16 *>(
            prefix_qk_storage.qk.q_decayed);
        at::BFloat16 *k_decayed = reinterpret_cast<at::BFloat16 *>(
            prefix_qk_storage.qk.k_decayed);
        union alignas(16) InverseBetaStorage
        {
            unsigned short inverse[kChunk * kDim];
            float beta[kChunk];
        };
        // gfx936 按 512 B 对齐 LDS 分配：12,800 B 可放五个
        // 四 wave CTA/CU；多一个字节就抬到 13,312 B，只能放四个。
        // 所有 shared 分配都计入这个和，并核对编译产物的 LDS 用量。
        static_assert(
            sizeof(PrefixQKStorage) + sizeof(InverseBetaStorage) + sizeof(DecayInverseStorage) <= 12800,
            "K1 LDS must stay within the five-CTA/CU allocation threshold");
        __shared__ InverseBetaStorage inverse_beta_storage;
        at::BFloat16 *k_inverse = reinterpret_cast<at::BFloat16 *>(inverse_beta_storage.inverse);
        __shared__ DecayInverseStorage decay_inverse_storage;
        float *end_decay = decay_inverse_storage.end_decay;
        float *beta_fp32 = inverse_beta_storage.beta;
        float *lower_matrix = prefix_qk_storage.qk.lower_matrix;
        at::BFloat16 *inverse_a = reinterpret_cast<at::BFloat16 *>(
            decay_inverse_storage.inverse.inverse_a);
        at::BFloat16 *inverse_b = reinterpret_cast<at::BFloat16 *>(
            decay_inverse_storage.inverse.inverse_b);
        at::BFloat16 *lower_c = reinterpret_cast<at::BFloat16 *>(
            decay_inverse_storage.inverse.lower_c);

        const int tid = static_cast<int>(threadIdx.x);
        const int chunk = static_cast<int>(blockIdx.x);
        const int lane = static_cast<int>(blockIdx.y);
        const int head = lane % heads;
        const int batch = lane / heads;
        const int token_base = chunk * kChunk;
        // 本 CTA 的 chunk 槽描述必须**在读取任何输入与 barrier 之前**取到：
        //   bos_chunk    = 该 chunk 在 packed 输入里的全局 token 起点（不是 chunk*16）
        //   valid_tokens = 有效 token 数；0 表示未使用槽
        int64_t bos_chunk = token_base;
        int valid_tokens = kChunk;
        if constexpr (kVarlen)
        {
            peer_varlen_chunk(varlen_info, chunk, bos_chunk, valid_tokens);
            // CTA 均匀的提前返回：不读 q/k/g/beta，不参与任何 __syncthreads。
            if (valid_tokens == 0)
                return;
        }
        if constexpr (kMasked && !kVarlen)
        {
            // 一个 CTA 仍是一个 (batch, 16-token chunk)，只有最后一个 chunk
            // 的有效 token 数小于 16；`fixed_tail_tokens` 是真实 T（不是向上取整后的长度），
            // 所以 `tokens - token_base` 恒 > 0（块数由 host 用 ceil(T/16) 给出）。
            valid_tokens = min(kChunk, fixed_tail_tokens - token_base);
        }
        // 直写目标：aligned 为 h*(B*chunks) + b*chunks + c；varlen 为 h*Qcap + c。
        // 这两处必须按 kVarlen 选择，定长尾块沿用 aligned 的 batch-major 布局。
        const int64_t total_tiles =
            static_cast<int64_t>(chunks) * (gridDim.y / heads);
        const int64_t p_ours = kVarlen
                                   ? static_cast<int64_t>(head) * varlen_info.capacity + chunk
                                   : static_cast<int64_t>(head) * total_tiles + static_cast<int64_t>(batch) * chunks + chunk;

        // 所有线程共用 chunk 起点，只有 row/channel 偏移不同。
        // 本 chunk 在 packed 输入里的**全局 token 起点**：aligned 是 batch*tokens+chunk*16；
        // varlen 是 chunk_info 给出的 bos_chunk（**不能**用 chunk*16 当全局偏移）。
        // beta 与 q/k/g 必须用同一个基址，否则多序列时 beta 会读到上一条序列的 token。
        // 定长尾块的真实 token stride 仍是 batch*tokens（跨 batch 按真实 T 前进）。
        const int64_t input_token_base = kVarlen
                                             ? bos_chunk
                                             : static_cast<int64_t>(batch) * tokens + token_base;
        const int64_t input_chunk_base = (input_token_base * heads + head) * kDim;
        const int64_t input_token_stride = static_cast<int64_t>(heads) * kDim;

        const int beta_row = tid - kDim;
        const bool owns_beta = tid >= kDim && tid < kDim + kChunk;
        // 无效行（尾块 padding）：行号 clamp 到最后一个有效行（一定在分配内），
        // 值在消费处按谓词归零。clamp 而不是 `if`：避免多一条依赖 vmcnt 的分支。
        const bool beta_row_valid = !kMasked || beta_row < valid_tokens;
        const int beta_rel = (kMasked && owns_beta && !beta_row_valid)
                                 ? (valid_tokens - 1)
                                 : beta_row;
        unsigned int beta_raw = 0;
        if (owns_beta)
        {
            const int64_t beta_input_index =
                (input_token_base + beta_rel) * heads + head;
            constexpr int kBetaBytes = BetaBf16 ? 2 : 4;
            const void *beta_address = static_cast<const unsigned char *>(beta) + beta_input_index * kBetaBytes;
            beta_raw = issue_beta_raw<BetaBf16>(beta_address);
        }

        // 按 token 半区把 sigmoid 准备分给整 wave：wave 0/1 在寄存器里保留
        // token 0..7，wave 2/3 把 token 8..15 发布到既有前缀存储的
        // 上半区，不新增 LDS 分配。
        const int gate_channel = tid % kDim;
        const int gate_half = tid / kDim;
        constexpr int kGateHalf = kChunk / 2;
        const float gate_weight = exp_fast(A_log[head]);
        const float gate_bias = HasBias
                                    ? dt_bias[head * kDim + gate_channel]
                                    : 0.0f;
        float activated_gate[kGateHalf];
// 尾块处理：**clamp 地址 + select**（只有变长实例才付这份代价）：
//   * 无效 token 读的是本 chunk 内最后一个**有效** token 的值（一定在分配内，
//     不越界、不读 padding 区），随后按谓词丢弃；
//   * 逐条 `if (token_valid)` 会让编译器在每次消费前插 vmcnt(0)，把 8 条独立
//     load 串行化（变长实例要多出对齐检查的等待）；
//   * 无效 token 的前缀增量必须是 0（衰减恰为 1）；不能"把 g 补 0 再算 sigmoid"
//     ——sigmoid 非线性，补 0 不是中性。
// aligned 分支保留**原表达式逐字不变**（fixed 路径的 codegen 不受影响）。
#pragma unroll
        for (int i = 0; i < kGateHalf; ++i)
        {
            if constexpr (kMasked)
            {
                const int local = gate_half * kGateHalf + i;
                const int rel = min(local, valid_tokens - 1);
                const float raw = float(g[input_chunk_base + gate_channel + rel * input_token_stride]);
                activated_gate[i] = local < valid_tokens
                                        ? sigmoid(gate_weight * (raw + gate_bias))
                                        : 0.0f;
            }
            else
            {
                const at::BFloat16 *chunk_gate = g + input_chunk_base + gate_channel + static_cast<int64_t>(gate_half * kGateHalf) * input_token_stride;
                const float shifted = float(chunk_gate[i * input_token_stride]) + gate_bias;
                activated_gate[i] = sigmoid(gate_weight * shifted);
            }
        }
        if (tid >= kDim)
        {
#pragma unroll
            for (int i = 0; i < kGateHalf; ++i)
                prefix_log2[(kGateHalf + i) * kDim + gate_channel] =
                    activated_gate[i];
        }
        __syncthreads();
        // 只有两个完整 wave 做累加；每个 channel 只有一个所有者，
        // 因此可以先消费再安全覆盖自己的上半区临时项。
        // 保持原有 FP32 FMA 顺序，不做重结合扫描。
        if (tid < kDim)
        {
            // 先发出全部上半区读，再发独立的前八条
            // FMA；每次读返回该 channel 的两个 token 值。
            Vec2F32 upper_gate[4];
#if defined(__gfx936__)
            const unsigned int gate_lds_address = static_cast<unsigned int>(
                reinterpret_cast<unsigned long long>(prefix_log2 + gate_channel));
            asm volatile(
                "ds_read2st64_b32 %0, %4 offset0:16 offset1:18\n\t"
                "ds_read2st64_b32 %1, %4 offset0:20 offset1:22\n\t"
                "ds_read2st64_b32 %2, %4 offset0:24 offset1:26\n\t"
                "ds_read2st64_b32 %3, %4 offset0:28 offset1:30"
                : "=&v"(upper_gate[0]), "=&v"(upper_gate[1]),
                  "=&v"(upper_gate[2]), "=&v"(upper_gate[3])
                : "v"(gate_lds_address) : "memory");
#else
#pragma unroll
            for (int i = 0; i < kGateHalf; ++i)
                upper_gate[i / 2][i % 2] =
                    prefix_log2[(kGateHalf + i) * kDim + gate_channel];
#endif
            float lower_prefix[kGateHalf];
            float running = 0.0f;
#pragma unroll
            for (int i = 0; i < kGateHalf; ++i)
            {
                running = fmaf(gate_scale_log2, activated_gate[i], running);
                lower_prefix[i] = running;
            }
#if defined(__gfx936__)
            // 读写操作数让等待后的值成为 SSA 依赖，
            // 无需额外拷贝；核对 ISA 时注意是否提前消费 VGPR。
            asm volatile("s_waitcnt lgkmcnt(0)"
                         : "+v"(upper_gate[0]), "+v"(upper_gate[1]),
                           "+v"(upper_gate[2]), "+v"(upper_gate[3])
                         : : "memory");
#endif
// 独立的下半区写要等裸读就绪后再发，
// 完整的 LGKM 栅栏不能把这些无关写一起排空。
#pragma unroll
            for (int i = 0; i < kGateHalf; ++i)
                prefix_log2[i * kDim + gate_channel] = lower_prefix[i];
#pragma unroll
            for (int i = 0; i < kGateHalf; ++i)
            {
                const int local = (kGateHalf + i) * kDim + gate_channel;
                const float activated = upper_gate[i / 2][i % 2];
                running = fmaf(gate_scale_log2, activated, running);
                prefix_log2[local] = running;
            }
            const float final_decay = gate_exp2(running);
            end_decay[gate_channel] = final_decay;
            // 直写 gt：自然 K 槽位下物理行就是逻辑 K，K2 读到的四个分量直接是
            // 16*kt + 4*group + {0,1,2,3}，块内不再做置换。
            reinterpret_cast<float *>(
                ws_kr + p_ours * kKrgtStrideU16 + kDecayOffsetU16)[gate_channel] = final_decay;
        }
        // wave 2 在 wave 0/1 累加前缀时消费 beta；就绪性是
        // 值依赖：仅靠 memory clobber 会让纯寄存器
        // 运算上移到等待之前；这里等的是全部在飞 VM 操作。
        if (owns_beta)
        {
            unsigned int beta_ready;
#if defined(__gfx936__)
            asm volatile("s_waitcnt vmcnt(0)\n\tv_mov_b32 %0, %1"
                         : "=v"(beta_ready) : "v"(beta_raw) : "memory");
#else
            beta_ready = beta_raw;
#endif
            float beta_value;
            unsigned int beta_float_bits;
            if constexpr (BetaBf16)
                beta_float_bits = beta_ready << 16;
            else
                beta_float_bits = beta_ready;
            __builtin_memcpy(&beta_value, &beta_float_bits, sizeof(beta_value));
            // 尾块中性：无效行的 activated 必须是 0（sigmoid(0)=0.5 不是中性）。
            // 16 个槽仍然写满，避免 LDS union 复用残值被 relation_beta 读走。
            const float activated = beta_row_valid ? sigmoid(beta_value) : 0.0f;
            beta_fp32[beta_row] = activated;
            // 直写 beta：H1 先经历参考的 BF16 舍入再升 FP32；H2 保留同一 FP32 值。
            if constexpr (BetaFp32)
                beta_sigmoid[p_ours * kChunk + beta_row] = activated;
            else
                beta_sigmoid[p_ours * kChunk + beta_row] = float(make_bf16(activated));
        }
        __syncthreads();

        // 十六个线程归一化一行 token；每线程把八个 Q/K
        // channel 放在寄存器里，并立即乘上已准备的 gate decay；
        // 不在 LDS 里铺完整的 q_norm/k_norm tile。
        const int norm_row = tid / 16;
        const int norm_segment = tid % 16;
        const int norm_column = norm_segment * 8;
        // 尾块：无效行的 8 个原始值最终为 0。做法是**clamp 行号后无条件 load，
        // 再 select 成 0**：读的是最后一个有效 token 的行（在分配内），不进 padding。
        // 整行仍执行后面的 shuffle/归约/LDS 写/barrier（不能提前退出参与 norm_xor 的 lane）。
        // aligned 分支保留原表达式逐字不变。
        const int64_t norm_input_base = kMasked
                                            ? (input_chunk_base + ((norm_row < valid_tokens) ? norm_row : (valid_tokens - 1)) * input_token_stride + norm_column)
                                            : (input_chunk_base + norm_row * input_token_stride + norm_column);
        const bool norm_row_valid = !kMasked || norm_row < valid_tokens;
        float q_values[8];
        float k_values[8];
        float q_square = 0.0f;
        float k_square = 0.0f;
#pragma unroll
        for (int i = 0; i < 8; ++i)
        {
            const int64_t input_index = norm_input_base + i;
            const float q_raw = float(q[input_index]);
            const float k_raw = float(k[input_index]);
            q_values[i] = kMasked && !norm_row_valid ? 0.0f : q_raw;
            k_values[i] = kMasked && !norm_row_valid ? 0.0f : k_raw;
            q_square = fmaf(q_values[i], q_values[i], q_square);
            k_square = fmaf(k_values[i], k_values[i], k_square);
        }
        q_square += norm_xor<8>(q_square);
        k_square += norm_xor<8>(k_square);
        q_square += norm_xor<4>(q_square);
        k_square += norm_xor<4>(k_square);
        q_square += norm_xor<2>(q_square);
        k_square += norm_xor<2>(k_square);
        q_square += norm_xor<1>(q_square);
        k_square += norm_xor<1>(k_square);
        const float q_inverse_norm = rsqrtf(q_square + 1.0e-6f);
        const float k_inverse_norm = rsqrtf(k_square + 1.0e-6f);

        // 在任何线程把这些 LDS 字节改作
        // q_decayed/k_decayed 之前，读走全部存活前缀；barrier 分隔两段存储生命周期。
        float prefix_log2_values[8];
#pragma unroll
        for (int i = 0; i < 8; ++i)
            prefix_log2_values[i] = prefix_log2[tid * 8 + i];
        // wave 2 在 B2 之前发布 beta 的字节 [0,64)；只有 L 的 wave 0 需要
        // 它们。通过同一个 inverse_beta_storage union 读，并在 B3 之前
        // 保留原始 FP32 值；wait 与 memory clobber 保证
        // 完成与编译序；随后 B3 放行四个 pack wave
        // 把这些字节改写成 k_inverse。不要把这次读移到 B3 之后。
        float relation_beta = 0.0f;
        if (tid < kWave)
        {
            relation_beta = beta_fp32[tid & 15];
            asm volatile("s_waitcnt lgkmcnt(0)" : "+v"(relation_beta) : : "memory");
        }
        __syncthreads();

        // 自然 K 槽位要求同一 dword 的两个分量是**相邻**逻辑 K（K、K+1），
        // 因此配对从「i 与 i+4」改为「2*pair 与 2*pair+1」；每个 BF16 舍入边界不变。
        const at::BFloat16 scale_bf16(scale);
#pragma unroll
        for (int pair = 0; pair < 4; ++pair)
        {
            unsigned int q_pair = 0;
            unsigned int k_pair = 0;
            unsigned int inverse_pair = 0;
#pragma unroll
            for (int component = 0; component < 2; ++component)
            {
                const int i = 2 * pair + component;
                // 自然对数前缀在 [-80,0]；换成 log2 后
                // 落在 [-80*log2(e),0]，正向/逆向 decay 仍能放进 BF16。
                const at::BFloat16 decay = make_bf16(gate_exp2(prefix_log2_values[i]));
                const at::BFloat16 inverse_decay =
                    make_bf16(gate_exp2(-prefix_log2_values[i]));
                const at::BFloat16 q_normalized =
                    make_bf16(q_values[i] * q_inverse_norm);
                const at::BFloat16 k_normalized =
                    make_bf16(k_values[i] * k_inverse_norm);
                const at::BFloat16 q_before_scale =
                    multiply_bf16(q_normalized, decay);
                const at::BFloat16 q_decayed_value =
                    multiply_bf16(q_before_scale, scale_bf16);
                const at::BFloat16 k_decayed_value =
                    multiply_bf16(k_normalized, decay);
                const at::BFloat16 k_inverse_value =
                    multiply_bf16(k_normalized, inverse_decay);
                unsigned short q_bits, k_bits, inverse_bits;
                __builtin_memcpy(&q_bits, &q_decayed_value, sizeof(q_bits));
                __builtin_memcpy(&k_bits, &k_decayed_value, sizeof(k_bits));
                __builtin_memcpy(&inverse_bits, &k_inverse_value, sizeof(inverse_bits));
                q_pair |= static_cast<unsigned int>(q_bits) << (component * 16);
                k_pair |= static_cast<unsigned int>(k_bits) << (component * 16);
                inverse_pair |= static_cast<unsigned int>(inverse_bits) << (component * 16);
            }
            // `local` 是 (token, channel) 线性序号：row = tid/16、channel 起点
            // `norm_column`，本 dword 的低半区 channel 是 `norm_column + 2*pair`。
            const int channel = norm_column + 2 * pair;
            const int local = tid * 8 + 2 * pair;
            const int packed_qk = packed_tile_index(local / kDim, local % kDim, kDim);
            // 每个 pair 在 16 B 对齐数组里都从偶数 BF16 索引开始。
            store_kdqd_pair_lds(q_decayed, packed_qk, q_pair);
            store_kdqd_pair_lds(k_decayed, packed_qk, k_pair);
            *reinterpret_cast<unsigned int *>(
                k_inverse + k_inverse_natural_index(channel / kChunk, norm_row,
                                                    channel % kChunk)) = inverse_pair;
        }
        __syncthreads();

        // LDS 已是 K2 目标布局：每线程连续读写 16B，无额外置换或 barrier。
        const int packed_copy_offset = tid * 8;
        peer_u16 *const kd_out = ws_kd + p_ours * kKdqdStrideU16;
        peer_u16 *const qd_out = kd_out + kQdOffsetU16;
        copy_kdqd_prelayout(qd_out, q_decayed, packed_copy_offset);
        copy_kdqd_prelayout(kd_out, k_decayed, packed_copy_offset);

        // K2 以同样的 packed A-fragment 格式消费 k_restored^T；解出本线程
        // 连续的八个输出位置，从行主序 k_inverse LDS 取出对应的 token
        // 值，并发出一次 16 B 写。
        {
            const int key_tile = tid / 32;
            const int key_in_tile = (tid % 32) / 2;
            const int token_group_base = (tid & 1) * 2;
            const int key_channel = key_tile * kChunk + key_in_tile;
            const at::BFloat16 chunk_decay = make_bf16(end_decay[key_channel]);
            Vec8Bf16 kr_packed;
#pragma unroll
            for (int i = 0; i < 8; ++i)
            {
                const int token = token_group_base + i / 4 + (i & 3) * 4;
                kr_packed[i] = float_to_bf16(
                    float(k_inverse[k_inverse_natural_index(
                        key_tile, token, key_in_tile)]) *
                    float(chunk_decay));
            }
            // 直写 kr：槽号 4*(channel&15) + 64*(token&3)，槽内 4 元组顺序不变。
            peer_u16 *const kr_out = ws_kr + p_ours * kKrgtStrideU16 + key_tile * (kChunk * kChunk) + 4 * key_in_tile;
            Vec4Bf16 kr_low;
            Vec4Bf16 kr_high;
#pragma unroll
            for (int i = 0; i < 4; ++i)
            {
                kr_low[i] = kr_packed[i];
                kr_high[i] = kr_packed[4 + i];
            }
            *reinterpret_cast<Vec4Bf16 *>(kr_out + 64 * token_group_base) = kr_low;
            *reinterpret_cast<Vec4Bf16 *>(
                kr_out + 64 * ((token_group_base + 1) & 3)) = kr_high;
        }
        // 两个 wave 用原生 16x16x16 矩阵指令并行构建 L 与 Mqk，
        // 与 FlashKDA K1 的 split-warp relation 阶段同构。
        if (tid < 2 * kWave)
        {
            const bool make_mqk = tid >= kWave;
            const int wave_lane = tid & 63;
            const int matrix_row = wave_lane & 15;
            const int group = wave_lane >> 4;
            Vec4F32 accumulator = {0.0f, 0.0f, 0.0f, 0.0f};
#pragma unroll
            for (int key_tile = 0; key_tile < kDim / 16; ++key_tile)
            {
                const Vec4Bf16 a = load_kdqd_a_fragment(
                    make_mqk ? q_decayed : k_decayed,
                    key_tile, matrix_row, group);
                const Vec4Bf16 b = load_packed_a_fragment(
                    k_inverse, key_tile, matrix_row, group);
                accumulator = mmac_bf16(a, b, accumulator);
            }
            if (make_mqk)
            {
                Vec4Bf16 mqk_fragment;
#pragma unroll
                for (int i = 0; i < 4; ++i)
                {
                    const int matrix_col = group + i * 4;
                    mqk_fragment[i] = float_to_bf16(
                        matrix_col <= matrix_row ? accumulator[i] : 0.0f);
                }
                const int packed_offset = (matrix_row * 4 + group) * 4;
                // mqk 直接以 bf16 存储
                *reinterpret_cast<Vec4Bf16 *>(
                    ws_mqk + p_ours * (kChunk * kChunk) + packed_offset) = mqk_fragment;
            }
            else
            {
                // B4 之后四个 pack 生产者都已完成；K 的字节 [0,1024) 只由
                // tid 0..63（wave 0）拷贝，而 L 的 wave 0 又是唯一
                // 读 K 的 relation 消费者。wave 1..3 拷贝更高的 K 字节，Mqk 的
                // wave 1 读 Q/k_inverse。完成自己的拷贝与全部 L 读之后，
                // wave 0 通过与 lower_matrix 相同的 qk union 复用 [0,1024)。
                // 这次 wait + memory clobber 必须在下半区写之前：它是同 wave 的
                // 完成/定序，不是跨 wave barrier。
                // 所有求逆读者都在既有 B5 之后才消费下半区。
                asm volatile("s_waitcnt lgkmcnt(0)" : : : "memory");
#pragma unroll
                for (int i = 0; i < 4; ++i)
                {
                    const int matrix_col = group + i * 4;
                    const int matrix_index = matrix_row * kChunk + matrix_col;
                    lower_matrix[matrix_index] = matrix_col < matrix_row
                                                     ? accumulator[i] * relation_beta
                                                     : 0.0f;
                }
            }
        }
        __syncthreads();

        // 每个 wave 求逆一个 FP32 8x8 对角块；每 lane 拥有一个矩阵
        // 元素。初始化包含 pivot 0，其余六个 pivot 只用
        // wave shuffle，步间不需要 CTA 级 barrier 或 LDS 往返。
        float inverse_value = 0.0f;
        if (tid < 128)
        {
            const int tile = tid / kWave;
            const int element = tid & (kWave - 1);
            const int row = element / 8;
            const int col = element % 8;
            const int base = tile * 8;
            // pivot 0 只对严格下三角的第一列取负，可折进
            // 初始化：那些 lane 本来就持有需要的值，
            // 因此前两次 shuffle 与被丢弃的 FMA 都不必要。
            if (row == col)
                inverse_value = 1.0f;
            else if (row > col)
            {
                const float lower = lower_matrix[(base + row) * kChunk + base + col];
                inverse_value = col == 0 ? -lower : lower;
            }
#pragma unroll
            for (int pivot = 1; pivot < 7; ++pivot)
            {
                const float factor = -__shfl(
                    inverse_value, row * 8 + pivot, kWave);
                const float pivot_value = __shfl(
                    inverse_value, pivot * 8 + col, kWave);
                inverse_value = select_inverse_update(
                    inverse_value, factor, pivot_value, row, col, pivot);
            }
            if (tile == 0)
                inverse_a[col * 8 + row] = make_bf16(inverse_value);
            else
                inverse_b[element] = make_bf16(inverse_value);
        }

        // 按原有 BF16 边界合并 [A^-1,0; -B^-1*C*A^-1,B^-1]。
        if (tid < 64)
        {
            const int row = tid / 8;
            const int col = tid % 8;
            lower_c[tid] = make_bf16(lower_matrix[(row + 8) * kChunk + col]);
        }
        __syncthreads();
        if (tid < 64)
        {
            const int row = tid / 8;
            const int col = tid % 8;
            // 每列在既有 union 存储内都是 16 B 对齐的；
            // 按向量取回，下面的 FP32 FMA 仍保持原有顺序。
            const Vec8Bf16 inverse_a_column = *reinterpret_cast<const Vec8Bf16 *>(
                inverse_a + col * 8);
            // B 已是行主序，且每个八元素行都对齐；
            // 在 BC 之前整行取回，包括最后两个元素。
            const Vec8Bf16 inverse_b_row = *reinterpret_cast<const Vec8Bf16 *>(
                inverse_b + row * 8);
            float lower_c_column[8];
            load_bc_column(lower_c, col, lower_c_column);
            float bc = 0.0f;
#pragma unroll
            for (int d = 0; d < 8; ++d)
            {
                const unsigned int bits =
                    static_cast<unsigned int>(inverse_b_row[d]) << 16;
                float b_value;
                __builtin_memcpy(&b_value, &bits, sizeof(b_value));
                bc = fmaf(b_value, lower_c_column[d], bc);
            }
            // 完整的 8x8 中间结果属于本 wave；保持其原有
            // BF16 舍入，然后通过寄存器交换取值。
            const float negative_bc_value = float(make_bf16(-bc));
            float negative_bc_row[8];
            gather_correction_row(negative_bc_value, row, negative_bc_row);
            float correction = 0.0f;
#pragma unroll
            for (int d = 0; d < 8; ++d)
            {
                const unsigned int bits =
                    static_cast<unsigned int>(inverse_a_column[d]) << 16;
                float a_value;
                __builtin_memcpy(&a_value, &bits, sizeof(a_value));
                correction = fmaf(negative_bc_row[d],
                                  a_value, correction);
            }
            peer_u16 *chunk_inv = ws_inv + p_ours * (kChunk * kChunk);
            chunk_inv[packed_tile_index(row, col, kChunk)] =
                bf16_value_bits(inverse_a[col * 8 + row]);
            chunk_inv[packed_tile_index(row, col + 8, kChunk)] = 0;
            chunk_inv[packed_tile_index(row + 8, col, kChunk)] =
                bf16_value_bits(make_bf16(correction));
            chunk_inv[packed_tile_index(row + 8, col + 8, kChunk)] =
                bf16_value_bits(inverse_b[tid]);
        }
    }

} // namespace

#endif // FLASH_KDA_K1_KERNEL_CUH
