# SPDX-License-Identifier: MIT
# Copyright (c) 2026 Hygon Information Technology Co., Ltd.
#
# FlashKDA 融合 K1 的 Triton prepare kernel（按 chunk 并行处理 token）。
# 只被 `flash_kda.py` 的 host forward 使用；测试可直接取该 kernel 做阶段计时。

import os

import torch
import triton
import triton.language as tl

from .chunk_delta_attn_utils import (
    CHUNK_DELTA_ATTN_TRITON_AUTOTUNE,
    autotune_cache_kwargs,
    chunk_delta_attn_autotune_configs,
    exp,
    exp2,
    input_guard,
    tensor_cache,
)

from .utils.index import (
    prepare_chunk_indices,
)


CHUNK_DELTA_ATTN_USE_FLASH_KDA: bool = os.getenv(
    "CHUNK_DELTA_ATTN_USE_FLASH_KDA", "1"
).lower() in ("1", "true", "yes", "on")

FLASH_KDA_K: int = 128
FLASH_KDA_CHUNK: int = 32
FLASH_KDA_INV_BLOCK: int = 16


@triton.heuristics(
    {
        "IS_VARLEN": lambda args: args["cu_seqlens"] is not None,
        "HAS_BIAS": lambda args: args["dt_bias"] is not None,
    }
)
@triton.autotune(
    configs=chunk_delta_attn_autotune_configs(
        [
            triton.Config({}, num_warps=nw, num_stages=ns)
            for nw in [2, 4]
            for ns in [1, 2]
        ],
        default_config=triton.Config({}, num_warps=2, num_stages=1),
    ),
    key=["H", "K", "C"],
    **autotune_cache_kwargs,
)
@triton.jit(do_not_specialize=["T"])
def _flash_kda_prepare_kernel(
    q,
    k,
    g_raw,
    beta_raw,
    A_log,
    dt_bias,
    ws_kd,
    ws_qd,
    ws_kr,
    ws_gt,
    ws_beta,
    ws_inv_mqk,
    ws_inv_canonical,
    ws_mqk_canonical,
    cu_seqlens,
    chunk_indices,
    scale,
    lower_bound,
    T,
    NT,
    TOTAL_TILES,
    H: tl.constexpr,
    K: tl.constexpr,
    C: tl.constexpr,
    BC: tl.constexpr,
    NUM_DOUBLING: tl.constexpr,
    NUM_MERGE: tl.constexpr,
    IS_VARLEN: tl.constexpr,
    HAS_BIAS: tl.constexpr,
    CANONICAL: tl.constexpr,
):
    """按 chunk 准备数据：衰减后的 q/k、门总量、Mqk 以及 (I - L)^-1。"""
    i_t = tl.program_id(0).to(tl.int64)
    i_bh = tl.program_id(1).to(tl.int64)
    i_b, i_h = i_bh // H, i_bh % H

    if IS_VARLEN:
        # program_id(0) 已经是全局 chunk 索引；chunk_indices 将它映射为
        # （序列、序列内 chunk）。
        i_n = tl.load(chunk_indices + i_t * 2).to(tl.int64)
        i_tl = tl.load(chunk_indices + i_t * 2 + 1).to(tl.int64)
        bos = tl.load(cu_seqlens + i_n).to(tl.int64)
        eos = tl.load(cu_seqlens + i_n + 1).to(tl.int64)
        T_seq = eos - bos
        g_tile = i_t
    else:
        i_tl = i_t
        bos = i_b * T
        T_seq = T
        g_tile = i_b * NT + i_t

    t_off = i_tl * C
    if t_off >= T_seq:
        return
    actual_len = tl.minimum(C, T_seq - t_off)

    o_c = tl.arange(0, C)
    o_k = tl.arange(0, K)
    m_c = o_c < actual_len
    m_ck = m_c[:, None]

    base = (bos + t_off) * H + i_h
    qk_off = base * K + o_c[:, None] * (H * K) + o_k[None, :]

    b_q = tl.load(q + qk_off, mask=m_ck, other=0.0).to(tl.float32)
    b_k = tl.load(k + qk_off, mask=m_ck, other=0.0).to(tl.float32)

    # 对每一行做 L2 归一化，并保持与 l2norm_fwd 相同的 eps 放置位置。
    b_q = b_q * (1.0 / tl.sqrt(tl.sum(b_q * b_q, axis=1) + 1e-6))[:, None]
    b_k = b_k * (1.0 / tl.sqrt(tl.sum(b_k * b_k, axis=1) + 1e-6))[:, None]

    # 门控计算为 lower_bound * sigmoid(exp(A_log) * (g + dt_bias))，然后在 chunk 内
    # 做累积和并转换到 log2 空间。这里使用与 chunk_gate_cumsum 相同的表达式，确保两条路径的门控结果逐 bit 一致。
    b_g = tl.load(g_raw + qk_off, mask=m_ck, other=0.0).to(tl.float32)
    if HAS_BIAS:
        b_g = b_g + tl.load(dt_bias + i_h * K + o_k).to(tl.float32)[None, :]
    b_A = tl.load(A_log + i_h).to(tl.float32)
    b_gate = lower_bound * tl.sigmoid(exp(b_A) * b_g)
    LOG2_E: tl.constexpr = 1.4426950408889634
    b_gcum = tl.cumsum(b_gate, axis=0) * LOG2_E
    b_gcum = tl.where(m_ck, b_gcum, 0.0)

    # gcum 非正，并且沿 chunk 向下单调递减，因此下面所有指数都 <= 0，exp2 不会溢出。
    # 当 C=64 且 lower_bound=-5 时，gcum 本身会达到约 -460；因此这里不会直接计算未截断的 exp2(-gcum)。
    last_row = actual_len - 1
    b_g_last = tl.sum(tl.where(o_c[:, None] == last_row, b_gcum, 0.0), axis=0)
    b_g_total = exp2(b_g_last)

    # 衰减量以 chunk 起点为基准。它们只会乘到递归状态上，而递归状态从第 0 行进入该 chunk；
    # 因此，如果某一行的门控衰减已经超出 fp32 的表示范围，它确实不会再产生贡献，将其刷新为 0 是正确的。
    b_exp_g = exp2(b_gcum)

    # 这些数据在这里存储，而不是等到内核末尾再存：它们是三个 C x K 的 tile，
    # 如果在下面的求逆过程中一直保持有效，会占用 K1 没有余量的寄存器。H = 64 时，
    # 这一点就足以决定内核能否放入 256 个 VGPR，也就是每个 SIMD 运行一个还是两个 wave。
    #
    # 工作区布局为 [H, TOTAL_TILES, ...]，因此同一序列的 chunk 对 K2 的顺序遍历来说保持连续。
    # 尾部行会被清零，而不是保持未写入状态：K2 会在全部 C 行上累加 k_restored^T @ U，
    # 尾部的垃圾数据会污染递归状态，而不只是影响被 mask 的输出行。
    ws_idx = i_h * TOTAL_TILES + g_tile
    ck_off = ws_idx * C * K + o_c[:, None] * K + o_k[None, :]
    kd_value = tl.where(m_ck, b_k * b_exp_g, 0.0).to(tl.bfloat16)
    qd_value = tl.where(m_ck, b_q * b_exp_g * scale, 0.0).to(tl.bfloat16)
    kr_value = tl.where(
        m_ck, b_k * exp2(b_g_last[None, :] - b_gcum), 0.0
    ).to(tl.bfloat16)
    if CANONICAL:
        tile_base = ws_idx * C * K + (
            (o_c[:, None] // 16) * (K // 16) + o_k[None, :] // 16
        ) * 256
        packed = (
            (o_c[:, None] % 16) * 4 + (o_k[None, :] % 16 & 3)
        ) * 4 + (o_k[None, :] % 16 >> 2)
        tl.store(ws_kd + tile_base + packed, kd_value)
        tl.store(ws_qd + tile_base + packed, qd_value)
        kr_t = tl.trans(kr_value)
        kr_tile_base = ws_idx * K * C + (
            (o_k[:, None] // 16) * (C // 16) + o_c[None, :] // 16
        ) * 256
        kr_packed = (
            (o_k[:, None] % 16) * 4 + (o_c[None, :] % 16 & 3)
        ) * 4 + (o_c[None, :] % 16 >> 2)
        tl.store(ws_kr + kr_tile_base + kr_packed, kr_t)
    else:
        tl.store(ws_kd + ck_off, kd_value)
        tl.store(ws_qd + ck_off, qd_value)
        tl.store(ws_kr + ck_off, kr_value)
    tl.store(ws_gt + ws_idx * K + o_k, b_g_total)

    p_beta = beta_raw + (bos + t_off) * H + i_h + o_c * H
    b_beta = tl.sigmoid(tl.load(p_beta, mask=m_c, other=0.0).to(tl.float32))
    if CANONICAL:
        tl.store(ws_beta + ws_idx * C + o_c, tl.where(m_c, b_beta, 0.0))

    # chunk 内矩阵需要同一 chunk 两行之间的衰减差值。即使每一行相对于 chunk 起点的衰减并非 O(1)，
    # 这些差值在靠近对角线的位置仍是 O(1)，所以不能分解为
    # exp2(gcum[i]) * exp2(-gcum[j])：使用 Kimi 门控时，累积和每个 token 下降约 3.6 个 log2 单位，
    # 一个因子会下溢而另一个会上溢，原本应为 O(1) 的乘积就会崩溃。以 chunk 中点重新居中后，
    # 每个因子需要覆盖的范围减半；当 C <= 32 时，两者都能保持在 fp32 范围内。C = 64 覆盖约 280 个
    # log2 单位，因此需要像默认 intra 内核那样使用每个子 chunk 的 pivot。
    o_mid = tl.minimum(C // 2, actual_len - 1)
    b_gp = tl.sum(tl.where(o_c[:, None] == o_mid, b_gcum, 0.0), axis=0)
    b_gm = b_gcum - b_gp[None, :]
    b_dec = exp2(b_gm)
    b_inc = exp2(-b_gm)
    b_k_piv = tl.where(m_ck, b_k * b_dec, 0.0).to(tl.bfloat16)
    b_q_piv = tl.where(m_ck, b_q * b_dec * scale, 0.0).to(tl.bfloat16)
    b_k_inv = tl.where(m_ck, b_k * b_inc, 0.0).to(tl.bfloat16)

    # WY 形式需要计算 (I + tril(diag(beta) K K^T, -1))^-1。这里将 L 取反，
    # 这样下面的 doubling 就可以直接写成关于 L 的 Neumann 级数；如果之后再处理符号，
    # 每一项都需要交替变号。
    # 在 Kimi 默认的 lower_bound=-5 下，错误几乎不可见：衰减会把 L 压到接近 0，
    # 所以 (I + L)^-1 与 (I - L)^-1 在 bf16 精度范围内几乎一致。只有门控减弱时才会显现，
    # 这正是测试中的 lower_bound 扫描所防护的情况。
    o_i = tl.arange(0, C)
    b_L = tl.dot(b_k_piv, tl.trans(b_k_inv))
    b_L = tl.where(o_i[:, None] > o_i[None, :], -b_L * b_beta[:, None], 0.0)

    cc_off = ws_idx * 2 * C * C + o_i[:, None] * C + o_i[None, :]
    b_Mqk = tl.dot(b_q_piv, tl.trans(b_k_inv))
    b_Mqk = tl.where(o_i[:, None] >= o_i[None, :], b_Mqk, 0.0)
    if CANONICAL:
        inv_tile_base = ws_idx * C * C + (
            (o_i[:, None] // 16) * (C // 16) + o_i[None, :] // 16
        ) * 256
        inv_packed = (
            (o_i[:, None] % 16) * 4 + (o_i[None, :] % 16 & 3)
        ) * 4 + (o_i[None, :] % 16 >> 2)
        tl.store(ws_mqk_canonical + inv_tile_base + inv_packed, b_Mqk)
    else:
        tl.store(ws_inv_mqk + cc_off + C * C, b_Mqk)

    # 通过 (I+D)(I+D^2)(I+D^4)...(I+D^(BC/2)) 求 BC 宽度对角块的逆，
    # 然后将子对角块合并回来，每轮将块宽度加倍。D 是严格下三角矩阵，因此是幂零矩阵；
    # 每个合并层中的 INV @ L_off 也具有同样性质（它只把一个子块映射到正下方的子块，
    # 不会继续传播），所以在精确算术下两部分都是精确的。
    # 如果改为求和 I + D + D^2 + D^4 + ...，会悄悄丢掉 D^3、D^5、D^6 以及其他所有
    # 非二的幂次项；这不是正确的逆矩阵，并且对于这里的 D，误差量级会达到矩阵本身。
    #
    # 分块不是为了改变结果，而是为了控制中间结果。L^k 统计沿 chunk 向下的路径数量，
    # 因此当 key 相关且门控不再抑制 L 时，在全部 C = 32 行上其元素会达到 5e7；而它们求和得到的逆矩阵仍被限制在 1 以内。这个抵消过程无法幸免：
    # 直接加倍在 fp32 下会错 400%，在 bf16 下会错 1e5 倍，并且会使 fp16 溢出。限制为 BC = 16 行后，
    # 相同的幂次峰值为 2e3，结果误差可控制在 2e-4 以内，而矩阵乘法次数相同。
    #
    # 这里明确指定 input_precision，是因为没有注解的 fp32 dot 并不总是使用 fp32：
    # 在允许该设置的目标上，tl.dot 会将其解析为 "tf32"，随后 gfx942 选择
    # v_mfma_f32_32x32x4_xf32，将数据截断为 19 位且不做舍入。对于这种容易发生抵消的 doubling，
    # 误差会达到 2e1。
    b_D = tl.where(o_i[:, None] // BC == o_i[None, :] // BC, b_L, 0.0)
    b_INV = tl.where(o_i[:, None] == o_i[None, :], 1.0, 0.0) + b_D
    b_Dp = tl.dot(b_D, b_D, input_precision="ieee")
    for _ in tl.static_range(NUM_DOUBLING):
        b_INV = b_INV + tl.dot(b_INV, b_Dp, input_precision="ieee")
        b_Dp = tl.dot(b_Dp, b_Dp, input_precision="ieee")

    # 这里全程使用 fp32：这些部分和正是分块设计用来保持较小的量；如果将矩阵乘法缩窄到 fp16，
    # 病态情况下的误差会重新达到 100%。这是并行内核，因此增加宽度的代价几乎为零；K2 的串行遍历只会看到下面的 fp16 存储结果。
    w = BC
    for _ in tl.static_range(NUM_MERGE):
        m_off = (o_i[:, None] // (2 * w) == o_i[None, :] // (2 * w)) & (
            o_i[:, None] // w != o_i[None, :] // w
        )
        b_off = tl.where(m_off, b_L, 0.0)
        b_INV = b_INV + tl.dot(
            b_INV,
            tl.dot(b_off, b_INV, input_precision="ieee"),
            input_precision="ieee",
        )
        w = 2 * w

    if CANONICAL:
        tl.store(ws_inv_canonical + inv_tile_base + inv_packed, b_INV)
    else:
        tl.store(ws_inv_mqk + cc_off, b_INV)


# 即使全局 autotune 开关关闭，K2 仍保留三个配置；本文件中的其他内核在这种情况下会退回单个配置。
# K2 的并行度只有 num_segments * H * (W / BW)，因此最佳 BW 会随 head 数量变化：固定 BW=32 在
# H=16 时会产生约 1.4 倍的开销，使这条路径相对默认流程出现回归。三个配置可以低成本地完成首次调用扫描，
