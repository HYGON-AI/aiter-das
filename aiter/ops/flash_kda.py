# SPDX-License-Identifier: MIT
# Copyright (c) 2026 Hygon Information Technology Co., Ltd.
"""FlashKDA 用户主入口：一个 forward、一个 scratch 大小查询。

本模块是 FlashKDA 的**用户契约**，其余 Python 层（`aiter.ops.opus.*` 的 K1/K2/分段
wrapper、`opus.flash_kda_workspace` 的字段对象、feature 位包）都是实现内部，
不作为用户接口承诺稳定。

数据契约（与官方 FlashKDA 的差异在括号内标注）：

* ``q``/``k``/``g``：连续、同 GPU 的 BF16 ``[B,T,H,K]``
* ``v``/``out``：连续、同 GPU 的 BF16 ``[B,T,H,V]``；K=V=128，head 数一致
* ``beta``：连续、同 GPU 的 FP32/BF16 ``[B,T,H]``，内容为 sigmoid 前的 logits；
  BF16 在 K1 装载后提升为 FP32，sigmoid 结果保留 FP32
* ``A_log``：同 GPU 连续 FP32 ``[H]``，必填
* ``dt_bias``：同 GPU 连续 FP32 ``[H,K]`` 或 ``None``；扁平 ``[H*K]`` 仍可接受
* ``scale``：正标量，常规取值 ``K ** -0.5``
* ``lower_bound``：gate 下界，当前实现接受 ``[-5,0)``
* ``initial_state``：FP32/BF16 ``[B,H,K,V]``，VK 布局时为 ``[B,H,V,K]``
  （变长同理，第一维为 N），``None`` 表示零初态
* ``final_state``：调用者提供的终态输出 buffer，形状/dtype **与初态同一布局**规则一致
* ``cu_seqlens``：INT32/INT64 同 GPU 连续一维 ``[N+1]``；变长物理 B=1、T 为总 token 数
* ``out``：必填 caller-owned buffer，原位写入
* ``workspace``：可选同 GPU 连续 16B 对齐 uint8 scratch；缺省由 native 分配

**state 布局由 `state_v_first` 唯一决定**：默认 ``False`` 用 ``[.., K, V]``（KV，value
方向连续），``True`` 用 ``[.., V, K]``（VK，key 方向连续）。K=V=128 时两种布局形状相同，
因此**不能从形状推断**，必须显式给出；初态与终态共用同一个值，不支持一次调用混用。
实现内部不转置、不做布局转换 kernel；调用者须提供与参数一致的连续状态数据。

调用成功返回 ``None``。``out`` 与 ``final_state`` 都是调用者的 buffer，本入口不做任何
结果复制，也不额外 launch 转换 kernel。
"""

from .opus.flash_kda_forward import (
    FEATURE_STATE_V_FIRST,
    HCU_REQUIRED_FEATURES,
    _forward,
    workspace_spec as _workspace_spec,
)

__all__ = ["fwd", "get_workspace_size"]


def fwd(
    q,
    k,
    v,
    g,
    beta,
    scale,
    out,
    A_log,
    dt_bias,
    lower_bound,
    initial_state=None,
    final_state=None,
    cu_seqlens=None,
    *,
    workspace=None,
    state_v_first=False,
):
    """FlashKDA 前向：结果原地写入 ``out``（可选 ``final_state``），返回 ``None``。

    生产计算语义（QK L2Norm、gate 激活、beta sigmoid、safe gate）固定启用，
    不作为参数暴露。``final_state=None`` 表示不输出终态。
    ``state_v_first`` 选择初态/终态的外部布局（``False``=KV，``True``=VK），默认 KV。
    """
    if out is None:
        raise TypeError("out must be a preallocated tensor")
    features = HCU_REQUIRED_FEATURES | (FEATURE_STATE_V_FIRST if state_v_first else 0)
    result = _forward(
        q, k, v, g, beta, A_log, dt_bias,
        scale=scale, lower_bound=lower_bound,
        initial_state=initial_state,
        output_final_state=final_state is not None,
        state_dtype=None if final_state is None else final_state.dtype,
        cu_seqlens=cu_seqlens, features=features,
        allow_fallback=True, normalize_inputs=False,
        out=out, final_state=final_state, workspace=workspace,
    )
    if result is None or result[0] is None:
        raise NotImplementedError("FlashKDA does not support these inputs")


def get_workspace_size(batch, tokens, heads, *, sequence_count=None, is_varlen=False):
    """返回 native 需要的 scratch 字节数（setup 查询，不是每步调用）。

    定长模式 ``sequence_count=None`` 等价于 ``batch``；变长模式必须显式给出
    正整数 ``sequence_count``（等于序列数 N）。
    """
    if sequence_count is None:
        if is_varlen:
            raise ValueError("sequence_count is required in varlen mode")
        sequence_count = batch
    size, _ = _workspace_spec(batch, tokens, heads, sequence_count, is_varlen)
    return size
