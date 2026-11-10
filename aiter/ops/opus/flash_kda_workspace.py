# SPDX-License-Identifier: MIT
"""Native K1/K2 阶段接口共用的 workspace 与元数据契约。

只描述形状与别名关系，不含任何 GPU 值。字节布局与索引的唯一事实来源是
`csrc/flash_kda_hcu/common/flash_kda_workspace.h` 与设备侧布局定义。
用户主入口 fwd 只接收连续 uint8 scratch，不暴露这些阶段字段。
"""

from dataclasses import dataclass

import torch


@dataclass(frozen=True)
class FlashKdaWorkspace:
    """K1 直写的 workspace：四个存储对象 + K1 已激活的 beta（共五个字段）。

    * ``kdqd``  ``[P,2,8,16,16]`` BF16 —— 每 chunk 8 KiB：kd 半区 + qd 半区（同一块，
      qd 半区相对 kd 半区偏移 4 KiB）
    * ``krgt``  ``[P,9,16,16]`` BF16 —— 每 chunk 4608 B：kr 4 KiB（8 tile）+ gt 512 B
      （第 9 个 tile，按 FP32 位型解释）
    * ``inv``   ``[P,1,1,16,16]`` BF16
    * ``mqk``   ``[P,1,1,16,16]`` BF16
    * ``beta_sigmoid`` ``[P,16]`` FP32 —— K1 已激活的 beta（与用户输入 raw beta 区分）

    ``P = H * workspace_head_stride_chunks``，索引
    ``p = head * workspace_head_stride_chunks + sequence_chunk_offset + chunk``。
    """

    kdqd: torch.Tensor
    krgt: torch.Tensor
    inv: torch.Tensor
    mqk: torch.Tensor
    beta_sigmoid: torch.Tensor


@dataclass(frozen=True)
class FlashKdaPrepareMeta:
    """定长索引元数据（纯 host 值，不含 GPU 内容）。

    ``workspace_head_stride_chunks`` 是一个 head 的 workspace 槽跨度（定长 = B*chunks），
    不是有效 chunk 总数。
    """

    B: int
    T: int
    H: int
    K: int
    C: int
    workspace_head_stride_chunks: int
