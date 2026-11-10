// SPDX-License-Identifier: MIT
//
// 段间 scan：扫描各段仿射状态（state_next = A*state + b），写回各段真实输入态。

#ifndef FLASH_KDA_SEGMENT_SCAN_CUH
#define FLASH_KDA_SEGMENT_SCAN_CUH

#include "flash_kda_segment_common.cuh"

// K1 直写 group-major 布局，
// 分段 passA/replay 直接读 global 的 kd/qd A fragment，取址必须与 K1 写出布局一致：
// tile 内 u16 偏移 = group*64 + row*4（8 B 对齐由 group*128 + row*8 字节保证）。

// scan kernel 的两项**已定型**优化（无开关）：
//   * 无分支整数 RNE 转换（float_to_bf16_rne_fast）：对有限输入与 __float2bfloat16 逐位一致。
//   * segment_transition「块内索引置换」：writer(passA 的 StateTransposed 路径) 与 reader(scan) 两侧
//     同时把块内索引换成双射 phi(group,s)=group*4+s。两侧施同一双射 ⇒ 读到的元素不变，
//     但每个 lane 的 4 个值连续 ⇒ 一次 8 字节向量 load（load 指令 256 -> 64 / segment / lane）。
//     ⚠️ 该置换只在 StateTransposed 布局下成立（见下方 TORCH_CHECK）。
//
// 未启用的第三项 SCAN_HOIST（把 b_vec 提出 mt 循环）单用 -11 %，
// 但与 RNE/PERM 组合无额外收益，故**不启用**；结论见主题 h12-segmented-stages §12。

namespace
{

    // scan 固定 1 wave：它扫描段间仿射状态，每段只读一次 A/b，2 wave 以上的收益
    // 被 RC 家族（LDS=0）的最优臂吃掉，故不保留 wave 档位。
    // 外部初态按 StateVFirst 选择布局；中间契约（shared state 与
    // segment_initial_states）恒为自然 [K,V] FP32，不随外部布局转置。
    template <bool StateBf16 = false, bool StateVFirst = false>
    __global__ __launch_bounds__(kSegmentScanWaves * 64) void kda_segment_scan_kernel(
        const unsigned short *segment_transition,
        const float *segment_update,
        float *segment_initial_states,
        const state_scalar_t<StateBf16> *initial_state,
        int batch,
        int heads,
        int segment_count,
        bool has_initial)
    {
        __shared__ float state[kSegmentScanWaves][kKeyDim * 16];
        __shared__ float next_state[kSegmentScanWaves][kKeyDim * 16];
        const int lane = static_cast<int>(threadIdx.x) & 63;
        const int wave = static_cast<int>(threadIdx.x) / 64;
        const int row = lane & 15;
        const int group = lane >> 4;
        const int value_group = static_cast<int>(blockIdx.y) * kSegmentScanWaves + wave;
        // blockIdx.x 覆盖 batch*heads：低并行度（B*H 小）时长序列也能铺满 CU。
        const int bh = static_cast<int>(blockIdx.x);
        const int b = bh / heads;
        const int head = bh - b * heads;
        const int bh_count = batch * heads;
        if (bh >= bh_count || value_group >= kValueDim / 16)
            return;
        const int col0 = value_group * 16;
        float *current = state[wave];
        float *next = next_state[wave];
        const int64_t state_head_base =
            static_cast<int64_t>(b * heads + head) * kKeyDim * kValueDim;
#pragma unroll
        for (int i = lane; i < kKeyDim * 16; i += 64)
        {
            current[i] = 0.0f;
            if (has_initial)
            {
                // 只改外部初态读取：BF16 精确提升 FP32；内部 shared state 仍 FP32。
                // `current` 的索引是自然 [K, v_local]；外部布局只影响寻址。
                const auto value =
                    initial_state[state_head_base +
                                  flash_kda_state_layout::state_local_offset<StateVFirst>(
                                      i / 16, col0 + (i % 16), kKeyDim, kValueDim)];
                if constexpr (StateBf16)
                    current[i] = bf16_raw_to_float(value);
                else
                    current[i] = value;
            }
        }
        __syncthreads();

        for (int segment = 0; segment < segment_count; ++segment)
        {
            float *h_dst = segment_initial_states +
                           (static_cast<int64_t>(segment) * bh_count + b * heads + head) * kKeyDim * kValueDim;
#pragma unroll
            for (int i = lane; i < kKeyDim * 16; i += 64)
                h_dst[(i / 16) * kValueDim + col0 + (i % 16)] = current[i];
            __syncthreads();

            const int64_t a_base =
                (static_cast<int64_t>(segment) * bh_count + b * heads + head) * kKeyDim * kKeyDim;
            const int64_t b_base =
                (static_cast<int64_t>(segment) * bh_count + b * heads + head) * kKeyDim * kValueDim;
#pragma unroll
            for (int mt = 0; mt < kKeyDim / 16; ++mt)
            {
                const int m = mt * 16 + row;
                vec4_fp32 acc = {0, 0, 0, 0};
#pragma unroll
                for (int kt = 0; kt < kKeyDim / 16; ++kt)
                {
                    vec4_bf16 a_vec;
                    vec4_bf16 b_vec;
                    const unsigned short *a_row = segment_transition + a_base + m * kKeyDim + kt * 16;
                    // segment_transition 用 passA 的置换写行：本 lane 的 4 个值连续 ⇒ 一次 8 B 向量读。
                    // 字节偏移恒为 8 的倍数（a_base % 16384 == 0、m*kKeyDim 与 kt*16 均为 8 的倍数、
                    // group*4 为 4 个 u16），故对齐安全。
                    a_vec = *reinterpret_cast<const vec4_bf16 *>(a_row + group * 4);
#pragma unroll
                    for (int s = 0; s < 4; ++s)
                    {
                        // b_vec 惰性读取本段 current 的一行，并用无分支 RNE 转 bf16。
                        const float value = current[(kt * 16 + group + s * 4) * 16 + row];
                        b_vec[s] = flash_kda_k2_fragments::float_to_bf16_rne_fast(value);
                    }
                    acc = opus_mmac_bf16(a_vec, b_vec, acc);
                }
#pragma unroll
                for (int s = 0; s < 4; ++s)
                {
                    const int n = col0 + group + s * 4;
                    next[m * 16 + group + s * 4] = acc[s] + segment_update[b_base + m * kValueDim + n];
                }
            }
            __syncthreads();
            float *tmp = current;
            current = next;
            next = tmp;
        }
    }

    void check_k2_tensor(
        const torch::Tensor &tensor,
        const char *name,
        at::ScalarType dtype,
        std::initializer_list<int64_t> shape)
    {
        TORCH_CHECK(tensor.is_cuda(), name, " must be on a GPU");
        TORCH_CHECK(tensor.is_contiguous(), name, " must be contiguous");
        TORCH_CHECK(tensor.scalar_type() == dtype, name, " has wrong dtype");
        TORCH_CHECK(tensor.sizes().vec() == std::vector<int64_t>(shape), name, " has wrong shape");
    }

} // namespace

#endif // FLASH_KDA_SEGMENT_SCAN_CUH
