// SPDX-License-Identifier: MIT
//
// 分段 K2（affine pass / scan / replay）的私有公共头：布局常量、gt/kr 合并区
// 寻址、fragment 别名与四 wave 协作搬运。只被 k2/ 下的实现文件包含。

#ifndef FLASH_KDA_SEGMENT_COMMON_CUH
#define FLASH_KDA_SEGMENT_COMMON_CUH

#include <ATen/hip/HIPContext.h>
#include <hip/hip_bf16.h>
#include <hip/hip_fp16.h>
#include <hip/hip_runtime.h>
#include <torch/extension.h>

#include <cstdint>
#include <cstdlib>
#include <cstring>
#include <type_traits>

#include "flash_kda_hcu.h"
#include "flash_kda_intrinsics.cuh" // 四 wave 实验臂共用的访存/等待封装
#include "flash_kda_fragments.cuh"
#include "flash_kda_state_layout.cuh"

namespace
{

    constexpr int kChunkSize = 16;
    constexpr int kKeyDim = 128;
    constexpr int kValueDim = 128;
    // kd|qd 合并区：qd 半区相对 kd 半区的偏移（u16）= 4 KiB。
    constexpr int kQdOffsetU16 = kChunkSize * kKeyDim;
    // scan 固定 1 wave（见 flash_kda_segment_scan.cuh 的说明）。
    constexpr int kSegmentScanWaves = 1;
    constexpr int kTile = 16;
    // tile 内 A-fragment 偏移（u16）= group*64 + row*4。
    __device__ __forceinline__ constexpr int kda_c16_kdqd_seg_cons_u16(int row, int group)
    {
        return group * 64 + row * 4;
    }
    // kr 与 gt 合并成一个 workspace 区：每 chunk = kr 8 tile（4096 B）
    //   + gt 512 B（= 1 个 16×16 bf16 tile）⇒ 4608 B 连续。
    //   `kChunkSize*kKeyDim` = 2048 u16 = 8 个 tile；gt 是第 9 个 tile
    //   （`kChunkSize*kChunkSize` = 256 u16）。K1 写侧与分段读侧共用这两个常量。
    constexpr int kDecayOffsetU16 = kChunkSize * kKeyDim;                     // gt 段偏移 = 4096 B
    constexpr int kKrgtStrideU16 = kDecayOffsetU16 + kChunkSize * kChunkSize; // 合并区跨度 = 4608 B
    constexpr int kDecayOffsetF32 = kDecayOffsetU16 / 2;                      // float 单位 = 1024

    __device__ __forceinline__ const float *kda_k2_gt_ptr(const float *base, int64_t p)
    {
        return base + p * (kKrgtStrideU16 / 2) + kDecayOffsetF32;
    }

    using flash_kda_k2_fragments::float_to_bf16;
    using flash_kda_k2_fragments::float_to_f16;
    using flash_kda_k2_fragments::opus_mmac_bf16;
    using flash_kda_k2_fragments::opus_mmac_f16;
    // kr 的 tile 内布局由 `common/flash_kda_fragments.cuh` 的 `kr_*` 定义，
    // K1 写侧与分段读侧共用；任何一侧漏改都会让分段 shape 错位。
    using flash_kda_k2_fragments::kr_vec4_ptr;
    using flash_kda_k2_fragments::vec4_bf16;
    using flash_kda_k2_fragments::vec4_f16;
    using flash_kda_k2_fragments::vec4_fp32;

    // K1 写 gt 时按 4×4 块内转置：`k = mt*16 + g + 4s -> mt*16 + g*4 + s`。
    // 分段路径（passA / replay）每个 gt 消费点都必须按该置换寻址；置换是
    // 每个 16 元素块内的对合。
    // bf16 -> f32（左移 16 位）；与 `__bfloat162float` 逐位一致。
    __device__ __forceinline__ float bf16_to_float(unsigned short bits)
    {
        return opus::bf16_to_fp32(__builtin_bit_cast(opus::bf16_t, bits));
    }

    // 外部 initial/final_state 的标量类型：只影响 kernel 出口/入口的
    // 状态读写，内部 shared state / next_state / h_in / 矩阵累加恒 FP32。
    //   StateBf16=false → float；true → unsigned short（BF16 位型）
    template <bool StateBf16>
    struct state_scalar_type
    {
        using type = float;
    };
    template <>
    struct state_scalar_type<true>
    {
        using type = unsigned short;
    };
    template <bool StateBf16>
    using state_scalar_t = typename state_scalar_type<StateBf16>::type;

    // BF16 原始 16 位位型 → FP32（精确，无舍入）。
    __device__ __forceinline__ float bf16_raw_to_float(unsigned int raw)
    {
        return __builtin_bit_cast(float, (raw & 0xffffu) << 16);
    }

    namespace
    {
        namespace seg4w
        {
            using vec4_u32 = unsigned int __attribute__((ext_vector_type(4)));

            constexpr int kWaves = 4;
            // 一个 kd 或 qd 的 tile 是 8×16×16 u16 = 4 KiB（四 wave 各搬 1 KiB）。
            constexpr int kKdqdTileU16 = 8 * kTile * kTile;
            // Replay 每 chunk 的取值发射条数（每 wave 计"条"，与执行它的 lane 数无关）。
            constexpr int kIssueKd = 1;
            constexpr int kIssueQd = 1;
            constexpr int kLdsNext = kIssueKd + kIssueQd; // 下一代 kd/qd 直写 = 2
            constexpr int kIssueKrgt = 2;                 // kr 1 + gt 1（共用一条发射点）
            constexpr int kStoreInstr = 4;                // out 的 4 条 buffer_store_short

            __device__ __forceinline__ vec4_u32 make_rsrc(const void *base)
            {
                const unsigned long long addr = reinterpret_cast<unsigned long long>(base);
                vec4_u32 rsrc;
                rsrc[0] = static_cast<unsigned int>(addr & 0xffffffffull);
                rsrc[1] = static_cast<unsigned int>(addr >> 32);
                rsrc[2] = 0x80000000u; // 2 GiB 字节界（与本仓既有写法一致）
                rsrc[3] = 0x00020000u;
                return rsrc;
            }

            // kd（可选 qd）的 CTA 协作直写：每 wave 1 KiB 片，四 wave 合 4 KiB 全 tile。
            // LDS 落点 = 区基址 + (wave + it*kWaves)*1024 + lane*16（硬件补 lane*16）。
            template <bool WithQd>
            __device__ __forceinline__ void issue_kdqd(int tid, int64_t p,
                                                       const unsigned short *kd,
                                                       const unsigned short *qd,
                                                       unsigned short *s_kd,
                                                       unsigned short *s_qd)
            {
                constexpr int kCopies = kKdqdTileU16 / 8; // 256 × 16 B
                const int wave = tid >> 6;
                const vec4_u32 rsrc_kd = make_rsrc(kd);
                const vec4_u32 rsrc_qd = make_rsrc(qd);
                // soffset = wave 均匀的 chunk 基址（kd/qd 同 stride：2*16*128 u16）
                const unsigned int soff = static_cast<unsigned int>(p * (2 * kChunkSize * kKeyDim) * 2);
#pragma unroll
                for (int i = tid; i < kCopies; i += kWaves * 64)
                {
                    const int it = i / (kWaves * 64);
                    const unsigned int lds_slice =
                        static_cast<unsigned int>((wave + it * kWaves) * 1024);
                    const int voff = i * 16;
                    kda_c16_asm::buffer_load_dwordx4_lds(s_kd, rsrc_kd, lds_slice, soff, voff);
                    if constexpr (WithQd)
                        kda_c16_asm::buffer_load_dwordx4_lds(s_qd, rsrc_qd, lds_slice, soff, voff);
                }
            }

            // kr（4 KiB）+ gt（512 B）合并区的 CTA 协作直写：每 wave kr 1 KiB、gt 128 B。
            // 合并区 chunk 跨度 = 4608 B；gt 段区内偏移 = 4096 B。
            __device__ __forceinline__ void issue_krgt(int tid, int64_t p,
                                                       const unsigned short *krgt,
                                                       unsigned short *s_krgt)
            {
                constexpr int kCopies = kKdqdTileU16 / 8;          // 256 × 16 B = 4 KiB（kr 段）
                constexpr int kGtBytes = kKeyDim * 4;              // 512 B
                constexpr int kGtBytesPerWave = kGtBytes / kWaves; // 128 B
                constexpr int kGtLanesPerWave = kGtBytesPerWave / 16;
                const int wave = tid >> 6;
                const int lane = tid & 63;
                const vec4_u32 rsrc = make_rsrc(krgt);
                const unsigned int soff = static_cast<unsigned int>(p * (kKrgtStrideU16 * 2));
#pragma unroll
                for (int i = tid; i < kCopies; i += kWaves * 64)
                {
                    const int it = i / (kWaves * 64);
                    kda_c16_asm::buffer_load_dwordx4_lds(
                        s_krgt, rsrc, static_cast<unsigned int>((wave + it * kWaves) * 1024),
                        soff, i * 16);
                }
                if (lane < kGtLanesPerWave)
                {
                    kda_c16_asm::buffer_load_dwordx4_lds(
                        s_krgt, rsrc,
                        static_cast<unsigned int>(kDecayOffsetU16 * 2 + wave * kGtBytesPerWave),
                        soff, kDecayOffsetU16 * 2 + wave * kGtBytesPerWave + lane * 16);
                }
            }
        } // namespace seg4w
    } // namespace

} // namespace

#endif // FLASH_KDA_SEGMENT_COMMON_CUH
