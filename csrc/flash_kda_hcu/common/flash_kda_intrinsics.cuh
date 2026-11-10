// SPDX-License-Identifier: MIT
#pragma once
//
// KDA K2 的设备访存与等待封装（内联汇编）。
//
// 约定：
//   * 所有 global / LDS 访存（含 store）手写内联汇编；每个 asm 块、尤其每条
//     `s_waitcnt` 前后用 `__builtin_amdgcn_sched_barrier(0)` 钉死 —— 等待点与发射点的
//     相对顺序由调用方负责（vmcnt 立即数的正确性依赖"wait 之前已经发出哪些请求"）。
//   * 调用点只表达语义（等哪一代、等几条），不手写指令顺序。
//   * wave 均匀的地址走 `soffset`（u32，必须 wave 均匀）；per-lane 的值只能进 `voffset`。
//   * 本头所有 offset 参数单位统一为字节。
//
// MUBUF 直写 LDS（`buffer_load_dword{,x2,x4} ..., offen offset:0, lds`）：
//   LDS 落点 = `m0 + lane*16B` —— 硬件按 lane 自己加一项。⇒ `m0`（由
//   `shared_addr + lds_offset` 算出）必须是 wave 均匀的基址，每 lane 的差别只能体现
//   在 voffset 上；把 per-lane 值算进 m0 会让编译器发 `v_readfirstlane` 折成 lane0。
//   全局地址 = `rsrc.base + soffset(gvOffset_s) + voffset(gvOffset_v) + imm`。
//
// 等待入口（三个，按域区分）：
//   * `wait_vmcnt<N>()`           —— 只等 global 请求退休；
//   * `wait_lgkmcnt<N>()`         —— 只等 LDS 提交退休；
//   * `wait_vmcnt_lgkmcnt<V,L>()` —— 两者同时收口（一条 `s_waitcnt`）。
//   哪个域收口、以及在哪个消费点收口，由调用点按当前的发射序决定（见 K2 step 与
//   分段文件的等待点注释），本头只提供机制。
// ---------------------------------------------------------------------------

#if defined(__gfx936__) || defined(__gfx938__) || defined(__gfx946__)
#define KDA_C16_ASM_MEM 1
#else
#define KDA_C16_ASM_MEM 0
#endif

namespace kda_c16_asm
{

    // ---------------------------------------------------------------------------
    // 0. 调度钉死
    // ---------------------------------------------------------------------------

    // asm 块前的发射边界：不许编译器把访存/等待挪过这一点。
    __device__ __forceinline__ void sched_pin()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // ---------------------------------------------------------------------------
    // 1. waitcnt 封装
    //    N 为编译期立即数（`"n"` 约束），调用点不裸写 s_waitcnt。
    //
    // `s_waitcnt(vmcnt, lgkmcnt, expcnt)` 是一条指令编码三个计数器；本头把"只等一个
    // 计数器"的入口显式写两个字段（不依赖汇编器默认值）：
    //   * `wait_vmcnt_only<N>`   = `s_waitcnt vmcnt(N) lgkmcnt(15)`（15 = 不等 LDS）；
    //   * `wait_lgkmcnt_only<N>` = `s_waitcnt vmcnt(63) lgkmcnt(N)`（63 = 不等 VM）；
    //   * `wait_all_drained<>()` = `s_waitcnt vmcnt(0) lgkmcnt(0)`（两者都排空）。
    // 每个入口都是 `sched_barrier(0)` + 一条 asm + `sched_barrier(0)`。
    // 哪个域在哪个消费点收口由调用点决定（见 K2 step 与分段文件的等待点注释）。
    // ---------------------------------------------------------------------------

    // --- 1.1 单计数器入口（排法 A 的边界 1/边界 2 用）----------------------------
    template <int N>
    __device__ __forceinline__ void wait_vmcnt_only()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_waitcnt vmcnt(%0) lgkmcnt(15)" ::"n"(N) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    template <int N>
    __device__ __forceinline__ void wait_lgkmcnt_only()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_waitcnt vmcnt(63) lgkmcnt(%0)" ::"n"(N) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // 全排空（两个计数器都等 0）。
    __device__ __forceinline__ void wait_all_drained()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_waitcnt vmcnt(0) lgkmcnt(0)" ::: "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // --- 1.2 分域等待入口 -------------------------------------------------------
    // 等本 wave 的 global 请求退休到 ≤ N（**只等 vmcnt**，不等 LDS）。
    template <bool Sync, int N>
    __device__ __forceinline__ void wait_buffer_data_arrived()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        if constexpr (Sync)
            asm volatile("s_waitcnt vmcnt(%0) lgkmcnt(15)\n\ts_barrier\n" ::"n"(N) : "memory");
        else
            asm volatile("s_waitcnt vmcnt(%0) lgkmcnt(15)\n" ::"n"(N) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // 等 LDS 提交退休到 ≤ N（**只等 lgkmcnt**：直写落 LDS + ds_read 都在这个计数器里）。
    template <bool Sync, int N>
    __device__ __forceinline__ void wait_lds_data_arrived()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        if constexpr (Sync)
            asm volatile("s_waitcnt vmcnt(63) lgkmcnt(%0)\n\ts_barrier\n" ::"n"(N) : "memory");
        else
            asm volatile("s_waitcnt vmcnt(63) lgkmcnt(%0)\n" ::"n"(N) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // 只排空 VM（不等 LDS）；两个都排空用 `wait_all_drained()`。
    template <bool Sync>
    __device__ __forceinline__ void wait_all_buffer_data_arrived()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        if constexpr (Sync)
            asm volatile("s_waitcnt vmcnt(0) lgkmcnt(15)\n\ts_barrier\n" ::: "memory");
        else
            asm volatile("s_waitcnt vmcnt(0) lgkmcnt(15)\n" ::: "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // 跨 wave 会合（`s_barrier`），前后钉死。
    __device__ __forceinline__ void wait_all_warp_arrived()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_barrier\n" ::: "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // --- 1.3 不插调度屏障的低层入口 ----------------------------------------------
    template <int N>
    __device__ __forceinline__ void wait_vmcnt()
    {
        wait_buffer_data_arrived<false, N>();
    }

    template <int N>
    __device__ __forceinline__ void wait_lgkmcnt()
    {
        wait_lds_data_arrived<false, N>();
    }

    // 一条指令同时收两种计数（全排空就是 `<0,0>`；等价于"两个计数器都等"）。
    template <int VM, int LGKM>
    __device__ __forceinline__ void wait_vmcnt_lgkmcnt()
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("s_waitcnt vmcnt(%0) lgkmcnt(%1)" ::"n"(VM), "n"(LGKM) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // ===========================================================================
    // 2. global → LDS 直写（`buffer_load_… , lds`）
    //    参数序与参考头一致：(shared_addr, rsrc, lds_offset, gvOffset_s, gvOffset_v)
    //      * shared_addr  : LDS 目的缓冲基址（本 wave 的切片起点），**不含 lane 项**
    //      * rsrc         : buffer 描述符 V#（4 × u32，`kda_c16_make_buffer_rsrc` 造）
    //      * lds_offset   : 字节；wave 均匀（stage / wave 切片基址）
    //      * gvOffset_s   : 字节；**必须 wave 均匀** → soffset（SGPR/SALU 计算）
    //      * gvOffset_v   : 字节；per-lane → voffset（VGPR/VALU 计算）
    //    每条 load 的 m0 = shared_addr + lds_offset（wave 均匀），落点 = m0 + lane*16B。
    // ===========================================================================

#define KDA_C16_DEFINE_BUFFER_LOAD_LDS(NAME, MNEMONIC)                                     \
    template <typename DataType, typename RSRC>                                            \
    __device__ __forceinline__ void NAME(DataType *shared_addr, const RSRC &rsrc,          \
                                         unsigned int lds_offset, unsigned int gvOffset_s, \
                                         int gvOffset_v)                                   \
    {                                                                                      \
        KDA_C16_ASM_MEM_BODY(MNEMONIC, lds_offset, gvOffset_s, gvOffset_v)                 \
    }

#if KDA_C16_ASM_MEM
#define KDA_C16_ASM_MEM_BODY(MNEMONIC, lds_offset, gvOffset_s, gvOffset_v)                               \
    const unsigned int lds_lane0 =                                                                       \
        static_cast<unsigned int>(reinterpret_cast<unsigned long long>(shared_addr) +                    \
                                  static_cast<unsigned long long>(lds_offset));                          \
    __builtin_amdgcn_sched_barrier(0);                                                                   \
    asm volatile("s_mov_b32 m0, %1\n\t" MNEMONIC " %0, %2, %3, offen offset:0, lds\n" ::"v"(gvOffset_v), \
                 "s"(lds_lane0), "s"(rsrc), "s"(gvOffset_s)                                              \
                 : "memory");                                                                            \
    __builtin_amdgcn_sched_barrier(0);
#else
#define KDA_C16_ASM_MEM_BODY(MNEMONIC, lds_offset, gvOffset_s, gvOffset_v) \
    (void)shared_addr;                                                     \
    (void)rsrc;                                                            \
    (void)lds_offset;                                                      \
    (void)gvOffset_s;                                                      \
    (void)gvOffset_v;
#endif

    KDA_C16_DEFINE_BUFFER_LOAD_LDS(buffer_load_dwordx1_lds, "buffer_load_dword")
    KDA_C16_DEFINE_BUFFER_LOAD_LDS(buffer_load_dwordx2_lds, "buffer_load_dwordx2")
    KDA_C16_DEFINE_BUFFER_LOAD_LDS(buffer_load_dwordx4_lds, "buffer_load_dwordx4")

#undef KDA_C16_DEFINE_BUFFER_LOAD_LDS
#undef KDA_C16_ASM_MEM_BODY

    // ===========================================================================
    // 3. global → VGPR（`buffer_load_…`，无 lds 位）
    //    ⚠️ MUBUF 的寄存器目的形态**必须显式给 soffset**（`vdst, vaddr, srsrc, soffset, offen`），
    //       少了 soffset 汇编不过（历史坑，见 /NOTES §3 坑 1）。
    //    global 地址 = rsrc.base + gvOffset_s + gvOffset_v + imm。
    // ===========================================================================

#define KDA_C16_DEFINE_BUFFER_LOAD_REG(NAME, MNEMONIC)                            \
    template <typename RSRC, typename DstType>                                    \
    __device__ __forceinline__ void NAME(DstType &dst, const RSRC &rsrc,          \
                                         unsigned int gvOffset_s, int gvOffset_v) \
    {                                                                             \
        KDA_C16_ASM_REG_BODY(MNEMONIC, gvOffset_s, gvOffset_v, dst)               \
    }

#if KDA_C16_ASM_MEM
#define KDA_C16_ASM_REG_BODY(MNEMONIC, gvOffset_s, gvOffset_v, dst) \
    __builtin_amdgcn_sched_barrier(0);                              \
    asm volatile(MNEMONIC " %0, %1, %2, %3, offen offset:0\n"       \
                 : "=v"(dst)                                        \
                 : "v"(gvOffset_v), "s"(rsrc), "s"(gvOffset_s));    \
    __builtin_amdgcn_sched_barrier(0);
#else
#define KDA_C16_ASM_REG_BODY(MNEMONIC, gvOffset_s, gvOffset_v, dst) \
    (void)rsrc;                                                     \
    (void)gvOffset_s;                                               \
    (void)gvOffset_v;                                               \
    dst = DstType{};
#endif

    KDA_C16_DEFINE_BUFFER_LOAD_REG(buffer_load_dwordx1, "buffer_load_dword")
    KDA_C16_DEFINE_BUFFER_LOAD_REG(buffer_load_dwordx2, "buffer_load_dwordx2")
    KDA_C16_DEFINE_BUFFER_LOAD_REG(buffer_load_dwordx4, "buffer_load_dwordx4")
    // 16 位目的形态（§6 的例外：当本 lane 只需要 2 B、而放宽到 4 B 会越界读/写坏邻居时用它）。
    // ⚠️ d16 目的的高 16 位语义按"未定义"处理，调用点自行 `& 0xffff`。
    KDA_C16_DEFINE_BUFFER_LOAD_REG(buffer_load_ushort, "buffer_load_ushort")

#undef KDA_C16_DEFINE_BUFFER_LOAD_REG
#undef KDA_C16_ASM_REG_BODY

    // ===========================================================================
    // 4. global store（`buffer_store_…`）
    //    与 load 同套参数约定；gvOffset_s 必须 wave 均匀。
    //    ⚠️ 源操作数按**值**传，且必须是寄存器驻留的向量类型（`ext_vector_type`，
    //       例如本文件的 `vec4_u32` / `vec4_fp32`）；hip 的 `float4` 结构体作为函数参数走
    //       内存传递，clang 会报 `Don't know how to handle indirect register inputs for
    //       constraint 'v'`。单 dword 的 store 用标量即可。
    // ===========================================================================

#define KDA_C16_DEFINE_BUFFER_STORE(NAME, MNEMONIC)                               \
    template <typename RSRC, typename SrcType>                                    \
    __device__ __forceinline__ void NAME(SrcType src, const RSRC &rsrc,           \
                                         unsigned int gvOffset_s, int gvOffset_v) \
    {                                                                             \
        KDA_C16_ASM_STORE_BODY(MNEMONIC, gvOffset_s, gvOffset_v, src)             \
    }

#if KDA_C16_ASM_MEM
#define KDA_C16_ASM_STORE_BODY(MNEMONIC, gvOffset_s, gvOffset_v, src)                      \
    __builtin_amdgcn_sched_barrier(0);                                                     \
    asm volatile(MNEMONIC " %0, %1, %2, %3, offen offset:0\n" ::"v"(src), "v"(gvOffset_v), \
                 "s"(rsrc), "s"(gvOffset_s)                                                \
                 : "memory");                                                              \
    __builtin_amdgcn_sched_barrier(0);
#else
#define KDA_C16_ASM_STORE_BODY(MNEMONIC, gvOffset_s, gvOffset_v, src) \
    (void)src;                                                        \
    (void)rsrc;                                                       \
    (void)gvOffset_s;                                                 \
    (void)gvOffset_v;
#endif

    KDA_C16_DEFINE_BUFFER_STORE(buffer_store_dword, "buffer_store_dword")
    // 8 B 宽写：BF16 state 出口把四个 RNE 后的 bf16 打包成 64 位一次写出。
    KDA_C16_DEFINE_BUFFER_STORE(buffer_store_dwordx2, "buffer_store_dwordx2")
    KDA_C16_DEFINE_BUFFER_STORE(buffer_store_dwordx4, "buffer_store_dwordx4")
    // 16 位 store（只写低 16 位，不动邻居 2 B）—— bf16/f16 输出必须用它，不能用 dword。
    KDA_C16_DEFINE_BUFFER_STORE(buffer_store_short, "buffer_store_short")

#undef KDA_C16_DEFINE_BUFFER_STORE
#undef KDA_C16_ASM_STORE_BODY

    // ===========================================================================
    // 5. LDS 访问（ds_read / ds_write）
    //    地址一律是"LDS 字节地址"（= shared_addr 基址 + 字节偏移）。
    //    ds_read 只**发射**；数据就绪由 `wait_lgkmcnt<N>()` 收口（§2：等待交调用方表达）。
    // ===========================================================================

    // 由（基址, 字节偏移）算出 LDS 字节地址。
    template <typename DataType>
    __device__ __forceinline__ unsigned int lds_byte_addr(DataType *shared_addr, unsigned int offset)
    {
        return static_cast<unsigned int>(reinterpret_cast<unsigned long long>(shared_addr) + offset);
    }

    template <typename DstType>
    __device__ __forceinline__ void ds_read_b16(unsigned int lds_addr, DstType &dst)
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("ds_read_u16 %0, %1\n" : "=v"(dst) : "v"(lds_addr));
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    template <typename DstType>
    __device__ __forceinline__ void ds_read_b32(unsigned int lds_addr, DstType &dst)
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("ds_read_b32 %0, %1\n" : "=v"(dst) : "v"(lds_addr));
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    template <typename DstType>
    __device__ __forceinline__ void ds_read_b64(unsigned int lds_addr, DstType &dst)
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("ds_read_b64 %0, %1\n" : "=v"(dst) : "v"(lds_addr));
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    template <typename DstType>
    __device__ __forceinline__ void ds_read_b128(unsigned int lds_addr, DstType &dst)
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("ds_read_b128 %0, %1\n" : "=v"(dst) : "v"(lds_addr));
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // 源操作数按值传、且必须是 ext_vector_type（同上：hip 结构体会走内存传递而编不过）。
    template <typename SrcType>
    __device__ __forceinline__ void ds_write_b128(unsigned int lds_addr, SrcType src)
    {
#if KDA_C16_ASM_MEM
        __builtin_amdgcn_sched_barrier(0);
        asm volatile("ds_write_b128 %0, %1\n" ::"v"(lds_addr), "v"(src) : "memory");
        __builtin_amdgcn_sched_barrier(0);
#endif
    }

    // ---------------------------------------------------------------------------
    // 受控 MMAC（asm，固定阶段顺序）+ 多分量 ready relay
    //   · mmac_*：与 opus builtin 逐字节相同的编码（独立 kernel 已校准）；每条生成一个
    //     volatile asm 块 ⇒ **受控区域内顺序 = 源码顺序**，别的 asm（如 ds_read）无法插进来。
    //   · readyN<VM,LGKM>：把 wait 与同阶段需要的**多个 32 位分量**放进同一个 ASM，wait 后原值
    //     透传（"+v" = 读改写）⇒ 消费者通过**寄存器依赖**连到等待，而不只靠 memory clobber。
    //     ⚠️ 多分量时 %0..%(N-1) 是分量，立即数从 %N 开始（写错会 expected absolute expression）。
    // ---------------------------------------------------------------------------
    template <class D, class A, class B>
    __device__ __forceinline__ void mmac_bf16(D &d, const A &a, const B &b)
    {
#if KDA_C16_ASM_MEM
        asm volatile("v_mmac_f32_16x16x16_bf16 %0, %1, %2, %0" : "+v"(d) : "v"(a), "v"(b) : "memory");
#endif
    }

    template <class D, class A, class B>
    __device__ __forceinline__ void mmac_f16(D &d, const A &a, const B &b)
    {
#if KDA_C16_ASM_MEM
        asm volatile("v_mmac_f32_16x16x16_f16 %0, %1, %2, %0" : "+v"(d) : "v"(a), "v"(b) : "memory");
#endif
    }

    template <int VM, int LGKM, class T>
    __device__ __forceinline__ void ready1(T &x)
    {
#if KDA_C16_ASM_MEM
        asm volatile("s_waitcnt vmcnt(%1) lgkmcnt(%2)" : "+v"(x) : "n"(VM), "n"(LGKM) : "memory");
#endif
    }

    template <int VM, int LGKM, class T0, class T1, class T2, class T3,
              class T4, class T5, class T6, class T7>
    __device__ __forceinline__ void ready8(T0 &x0, T1 &x1, T2 &x2, T3 &x3,
                                           T4 &x4, T5 &x5, T6 &x6, T7 &x7)
    {
#if KDA_C16_ASM_MEM
        asm volatile("s_waitcnt vmcnt(%8) lgkmcnt(%9)"
                     : "+v"(x0), "+v"(x1), "+v"(x2), "+v"(x3), "+v"(x4), "+v"(x5), "+v"(x6), "+v"(x7)
                     : "n"(VM), "n"(LGKM) : "memory");
#endif
    }

} // namespace kda_c16_asm
