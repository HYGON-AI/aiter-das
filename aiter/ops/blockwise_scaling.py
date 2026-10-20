# Copyright (c) 2026 Hygon Information Technology Co., Ltd.
# SPDX-License-Identifier: MIT
"""blockwise_scaled_cast_transpose —— 1x128 行块量化 + cast + transpose。

单调用产出双布局双 scale：
  - rowwise    : output / scale_inv（GEMM_READY 或 COMPACT 布局）
  - columnwise : output_t / scale_inv_t（GEMM_READY 为转置布局，COMPACT 为原形状布局）

调用契约（对外 13 参）：
    input            输入张量，contiguous，dtype ∈ {fp32, fp16, bf16}
    output           optional，rowwise 量化输出（uint8 缓冲，dtype 由 out_dtype 解释）；
                     入口校验强制 has_value() == rowwise
    scale_inv        optional，rowwise 反量化 scale
    output_t         optional，columnwise 输出；has_value() == columnwise
    scale_inv_t      optional，columnwise 反量化 scale
    block_len        量化块长，仅支持 128（入口校验，其它值 RuntimeError）
    block_scaling_dim 量化维，仅支持 1
    rowwise          是否计算 rowwise 输出
    columnwise       是否计算 columnwise 输出
    epsilon          amax 下限
    pow2_scale       是否强制 scale 为 2 的幂
    all_gather_usage True = COMPACT scale 布局，False = GEMM_READY 布局
    out_dtype        torch.int8 / torch.float8_e4m3fn / torch.float8_e5m2

注：本桩不设默认值（13 参必填）；pybind 侧同样不设默认值，避免 C++ 默认值文本
进入 pybind 生成签名（aiter/jit/core.py 的 check_args 会 exec 解析该签名）。
"""

from typing import Optional

import torch
from torch import Tensor

from ..jit.core import compile_ops


@compile_ops("module_blockwise_scaling")
def blockwise_scaled_cast_transpose(
    input: Tensor,
    output: Optional[Tensor],
    scale_inv: Optional[Tensor],
    output_t: Optional[Tensor],
    scale_inv_t: Optional[Tensor],
    block_len: int,
    block_scaling_dim: int,
    rowwise: bool,
    columnwise: bool,
    epsilon: float,
    pow2_scale: bool,
    all_gather_usage: bool,
    out_dtype: torch.dtype,
) -> None:
    ...
