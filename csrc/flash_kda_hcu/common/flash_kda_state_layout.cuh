// SPDX-License-Identifier: MIT
// Copyright (c) 2026 Hygon Information Technology Co., Ltd.
#pragma once

// FlashKDA 外部 state 布局的纯坐标 helper。
//
// 外部 state 有两种等价布局，初态与终态共用同一个选择，形状恒为
// `[N, H, 128, 128]`（K=V=128，故无法从形状推断，必须由调用方显式给出）：
//   * `StateVFirst = false`（KV）：`state[n, h, k, v]`，v 连续；
//   * `StateVFirst = true` （VK）：`state[n, h, v, k]`，k 连续。
//
// 本文件只做整数坐标，不分配、不查设备、不读运行时开关。分帧写成两份的原因是
// MUBUF 边界访问要用「每 lane 私有」+「整 wave 均匀」两段地址相加：
//   lane 分量 = 只依赖 (group, row)，
//   wave 分量 = 依赖 (kt, s, col0) 但对整个 wave 一致。
// 两段之和必须等于 `state_local_offset` 给出的完整元素偏移，该等式在下方用
// 编译期枚举校验（两个布局 × 两种内部槽位映射）。
namespace flash_kda_state_layout
{

    // 一个 head 内、给定逻辑 (key, value) 的元素偏移。
    template <bool StateVFirst>
    __host__ __device__ constexpr int state_local_offset(int key, int value, int key_dim,
                                                         int value_dim)
    {
        return StateVFirst ? value * key_dim + key : key * value_dim + value;
    }

    // per-lane 段：`key_lane` 是该 lane 在 K 轴上占用的偏移（group 分量），
    // `row` 是该 lane 的 V 列。
    template <bool StateVFirst>
    __host__ __device__ constexpr int state_lane_offset(int key_lane, int row, int key_dim,
                                                        int value_dim)
    {
        return StateVFirst ? row * key_dim + key_lane : key_lane * value_dim + row;
    }

    // wave 段：`key_s` 是分量 s 在 K 轴上的偏移，`kt` 是 16 元素 K 块号。
    template <bool StateVFirst>
    __host__ __device__ constexpr int state_wave_offset(int key_s, int kt, int col0, int key_dim,
                                                        int value_dim)
    {
        return StateVFirst ? col0 * key_dim + 16 * kt + key_s
                           : (16 * kt + key_s) * value_dim + col0;
    }

    // 16 元素 K 块内的置换 `P(x) = 4*(x%4) + x//4`：自逆，把 (group, s) 两个坐标互换。
    // 自然槽位下它是「逻辑 K → 物理槽」的映射：
    //   逻辑 K = 16*kt + 4*group + s  ⇒  物理槽 = 16*kt + tile_permute(4*group + s)
    // 用于 kd/qd 的 LDS 落点、gt 的 AsegPerm 写行，以及 kr 的列重标记。
    __host__ __device__ constexpr int tile_permute(int x)
    {
        return ((x & 3) << 2) | ((x >> 2) & 3);
    }

    // 自然 K 槽位下 M3 的 B 操作数：物理列 n 承载的逻辑 K 是 `tile_permute(n)`，
    // 而 kr 的 lane row 就是它的物理列，因此读 kr 时把 row 换成 `tile_permute(row)`，
    // token 分量顺序保持不变（不新增 LDS 指令，也不改 kr 的输出格式）。
    __host__ __device__ constexpr int natural_kr_row(int row)
    {
        return tile_permute(row);
    }

    // ---- 编译期自检：lane + wave 必须等于完整偏移 ----
    // 内部槽位有两种历史映射，都已被本仓使用过：
    //   * 旧槽位：逻辑 K = 16*kt + group + 4*s   ⇒ key_lane = group,     key_s = 4*s
    //   * 自然槽位：逻辑 K = 16*kt + 4*group + s ⇒ key_lane = 4*group,   key_s = s
    // 两种映射都必须让分帧地址与完整地址逐元素一致，否则边界读写会写错位置。
    namespace detail
    {
        constexpr int kSelfCheckKeyDim = 128;
        constexpr int kSelfCheckValueDim = 128;

        template <bool StateVFirst, bool NaturalKey>
        constexpr bool check_split_offsets()
        {
            for (int group = 0; group < 4; ++group)
            {
                for (int row = 0; row < 16; ++row)
                {
                    for (int kt = 0; kt < kSelfCheckKeyDim / 16; ++kt)
                    {
                        for (int s = 0; s < 4; ++s)
                        {
                            for (int col0 = 0; col0 < kSelfCheckValueDim; col0 += 16)
                            {
                                const int key_lane = NaturalKey ? 4 * group : group;
                                const int key_s = NaturalKey ? s : 4 * s;
                                const int key = 16 * kt + key_lane + key_s;
                                const int whole = state_local_offset<StateVFirst>(
                                    key, col0 + row, kSelfCheckKeyDim, kSelfCheckValueDim);
                                const int split =
                                    state_lane_offset<StateVFirst>(
                                        key_lane, row, kSelfCheckKeyDim, kSelfCheckValueDim) +
                                    state_wave_offset<StateVFirst>(
                                        key_s, kt, col0, kSelfCheckKeyDim, kSelfCheckValueDim);
                                if (whole != split)
                                {
                                    return false;
                                }
                            }
                        }
                    }
                }
            }
            return true;
        }

        static_assert(check_split_offsets<false, false>(),
                      "KV state offset split must match state_local_offset (legacy slot)");
        static_assert(check_split_offsets<true, false>(),
                      "VK state offset split must match state_local_offset (legacy slot)");
        static_assert(check_split_offsets<false, true>(),
                      "KV state offset split must match state_local_offset (natural slot)");
        static_assert(check_split_offsets<true, true>(),
                      "VK state offset split must match state_local_offset (natural slot)");
    } // namespace detail

} // namespace flash_kda_state_layout
