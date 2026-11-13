// SPDX-License-Identifier: MIT
// Copyright (c) 2026 Hygon Information Technology Co., Ltd.
//
// peer K1 变长：GPU metadata 与描述符。
//
// 设计约束：
//   * metadata 是**独立小 kernel**，不占 peer K1 的 12,800 B LDS 预算；
//   * 分配只由 shape 决定（capacity = Qcap），有效内容每次调用重新生成；
//   * 不回读 GPU：host 不读 chunk_info/sequence_info 的内容，也不按内容启动；
//   * 结构错误（dtype/rank/device/非连续）在 host 同步拒绝，GPU 内容由调用方前置条件保证。
//
// chunk_info[Qcap, 2] INT64（AoS，与 K2 的 sequence_info 同风格）：
//   [c,0] = 该 chunk 在 packed 输入里的**全局 token 起点**
//   [c,1] = 有效 token 数 0..16；未使用槽恒为 0（每次调用先整体清零）
//
// sequence_info[N, 3] INT64：
//   [s,0] = bos（= cu[s]）
//   [s,1] = L[s]（= cu[s+1]-cu[s]）
//   [s,2] = sum_{j<s} ceil(L[j]/16)（chunk 槽起点，不是 token）
#pragma once

#include <cstdint>

#include <hip/hip_runtime.h>

namespace kda_peer
{

    constexpr int kPeerChunk = 16;
    constexpr int kPeerMetaThreads = 256;

    // 变长实例的描述符。空 Metadata 包 = 固定 aligned（旧实例），不读这个结构。
    struct VarlenInfo
    {
        const int64_t *chunk_info; // [Qcap, 2]，容量 Qcap = chunk_info 的行数
        int capacity;              // = Qcap
    };

    // 非对齐定长 batch 只需要真实 token 数，不需要 per-sequence 描述符：
    //   * 空 Metadata 包    → 原 aligned 实例（T%16==0），kernarg 列表与之前逐字相同；
    //   * FixedTailInfo → 定长 masked 实例：最后一个 chunk 按 valid_tokens 掩蔽；
    //   * VarlenInfo    → packed 变长实例（读 chunk_info）。
    // 块的**地址选择**（p_ours / input_token_base）必须按 kVarlen 判，不能按 kMasked 判，
    // 否则定长尾块会被当成 packed 布局；**逐 token 的中性掩蔽**按 kMasked 判（两种 masked
    // 实例共用同一套规则）。
    struct FixedTailInfo
    {
        int tokens; // 真实 T（不是向上取整后的长度）
    };

    // 只读 helper：一个 chunk 槽的（全局 token 起点，有效 token 数）。
    __device__ __forceinline__ void peer_varlen_chunk(const VarlenInfo &info, int chunk,
                                                      int64_t &bos_chunk, int &valid_tokens)
    {
        bos_chunk = info.chunk_info[2 * static_cast<int64_t>(chunk)];
        valid_tokens = static_cast<int>(info.chunk_info[2 * static_cast<int64_t>(chunk) + 1]);
    }

    // 单 CTA、256 序列一批的扫描。每个 __syncthreads 的位置与 stepwise 参考一致：
    //   * 清零后一次；
    //   * 每批：算长度 → 扫描（每步前后各一次）→ 写描述符 → syncthreads → cursor 更新
    //     → syncthreads。
    // inactive 线程（seq >= sequences）的 length 贡献 0，但仍参与扫描与 barrier。
    //
    // 容量安全：写 chunk 槽前判 `chunk < capacity`，容量不足时只截断写入、不越界
    // （调用方 Python 层按 ceil(T_total/16)+N 分配；本 clamp 只是防错分配的兜底，
    // 不是允许小容量）。
    template <typename Index>
    __global__ __launch_bounds__(kPeerMetaThreads) void build_varlen_metadata(
        const Index *cu,
        int sequences,
        int capacity,
        int64_t *chunk_info,
        int64_t *sequence_info)
    {
        __shared__ int64_t scan[kPeerMetaThreads];
        __shared__ int64_t cursor;
        const int tid = static_cast<int>(threadIdx.x);

        if (tid == 0)
            cursor = 0;
        for (int slot = tid; slot < capacity; slot += kPeerMetaThreads)
        {
            chunk_info[2 * static_cast<int64_t>(slot)] = 0;
            chunk_info[2 * static_cast<int64_t>(slot) + 1] = 0;
        }
        __syncthreads();

        for (int base = 0; base < sequences; base += kPeerMetaThreads)
        {
            const int seq = base + tid;
            const int64_t start = seq < sequences ? static_cast<int64_t>(cu[seq]) : 0;
            const int64_t end = seq < sequences ? static_cast<int64_t>(cu[seq + 1]) : 0;
            const int64_t length = end - start;
            scan[tid] = (length + kPeerChunk - 1) / kPeerChunk;
            __syncthreads();
            for (int stride = 1; stride < kPeerMetaThreads; stride *= 2)
            {
                const int64_t value = tid >= stride ? scan[tid - stride] : 0;
                __syncthreads();
                scan[tid] += value;
                __syncthreads();
            }
            const int64_t offset = cursor + (tid ? scan[tid - 1] : 0);
            if (seq < sequences)
            {
                sequence_info[3 * static_cast<int64_t>(seq)] = start;
                sequence_info[3 * static_cast<int64_t>(seq) + 1] = length;
                sequence_info[3 * static_cast<int64_t>(seq) + 2] = offset;
                for (int64_t token = 0, chunk = offset; token < length;
                     token += kPeerChunk, ++chunk)
                {
                    if (chunk >= capacity)
                        break;
                    chunk_info[2 * chunk] = start + token;
                    const int64_t remaining = length - token;
                    chunk_info[2 * chunk + 1] =
                        remaining < kPeerChunk ? remaining : kPeerChunk;
                }
            }
            __syncthreads();
            if (tid == 0)
                cursor += scan[kPeerMetaThreads - 1];
            __syncthreads();
        }
    }

} // namespace kda_peer
