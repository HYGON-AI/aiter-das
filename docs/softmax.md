# Softmax

`aiter.softmax` 对二维张量的最后一维计算稳定的 Softmax：

$$
y_{b,j}=\frac{\exp(x_{b,j}-m_b)}{\sum_k\exp(x_{b,k}-m_b)},\qquad
m_b=\max_k x_{b,k}.
$$

max、exp、sum 和归一化使用 FP32 中间值，输出转换回输入 dtype。

## API

```python
softmax(input: Tensor, dim: int = -1, *, out: Optional[Tensor] = None) -> Tensor
softmax_out(out: Tensor, input: Tensor, dim: int = -1) -> None
```

| 参数/行为 | 合同 |
| --- | --- |
| input | GPU 上连续的二维 `[B,D]`，FP16、BF16 或 FP32 |
| dim | `-1` 或 `1` |
| 宽度 | `1 <= D <= 524288`；D=0 或超出上限明确报错 |
| 空 batch | B=0 返回空输出，不启动 Softmax kernel |
| out | 同 shape、dtype、device，连续，与 input 所用地址区间不重叠 |
| 返回值 | softmax 返回 out 本身，未传 out 时分配输出；softmax_out 返回 None |
| storage offset | 支持非零 offset、未向量对齐的起始地址和非整齐宽度 |
| 自动求导 | 仅前向；开启 grad 且 input/out 需要梯度时拒绝，允许 no_grad/inference_mode |

不隐式复制不连续输入，不调用 Torch/Triton fallback。不支持任意轴、backward、
half_to_float=True、log-softmax、mask、causal、temperature、FP8 或 D>524288。

```python
import torch
import aiter

x = torch.randn(1024, 65536, device="cuda", dtype=torch.bfloat16)
with torch.inference_mode():
    y = aiter.softmax(x)
    out = torch.empty_like(x)
    assert aiter.softmax(x, out=out) is out
    aiter.softmax_out(out, x, dim=1)
```

## 实现与数值

独立 JIT 模块 `module_softmax` 由 `csrc/pybind/softmax_pybind.cu` 和
`csrc/kernels/softmax_kernels.cu` 构建。仅此模块追加
`-fno-gpu-flush-denormals-to-zero`，不改变全局编译选项或其他模块。
减 max 后小于 -80 的值使用 `expf(z/2)` 的 FP32 平方，保留渐进下溢；
其余使用 `__expf`，不启用 fast-math。

每行由一个 CTA 处理，行偏移使用64位：

- D≤16384：在寄存器中保存该行分给各线程的值；按实际 input/out 地址及行宽选择向量或 scalar/tail 路径。
- D=8192 且 FP16/BF16 输入输出地址均32字节对齐：256线程，每线程处理两个16元素向量；其他情况保留相应有界路径。
- D>16384：256线程循环处理，分别遍历输入计算 max、exp 的 sum、归一化输出。对齐时 Vec8，否则 Vec1，寄存器占用不随 D 增长。

所有路径均不使用全局 workspace，不需要额外 GPU 临时分配、复用缓存、
atomic 或跨 CTA spin；每次调用只依赖当前输入。大 D 路径三遍读取输入并重算 exp，
其性能受额外流量和每行循环长度影响；小 B 还可能缺少并行度。

使用调用时的当前设备和 stream。Graph 捕获前须 warmup 完成 JIT；
回放支持变化输入和重复使用输出。低层接口注册 mutation 和 fake/meta 行为，
支持 torch.compile fullgraph 的分配输出、预分配输出及 mutation 调用。

其余元素有限时，部分 -inf 对应零概率；全 -inf、包含 +inf 或 NaN 的行产生 NaN。
不承诺 NaN payload 或逐位一致性。相对 torch.softmax 的逐元素验收容差：

| dtype | rtol | atol |
| --- | ---: | ---: |
| FP32 | 1e-5 | 1e-7 |
| FP16 | 2e-3 | 1e-6 |
| BF16 | 1e-2 | 1e-5 |

极小概率另以 CPU FP64 参考检查非零掩码和输出量化精度，不用绝对容差掩盖清零。
输出保持低精度时，大 D 的正确舍入结果行和也可能偏离1：
例如 FP16、D=524288、首元素0其余-16，正确舍入后的行和约1.0068358。
大 D 数值边界测试同时核对逐元素 CPU FP64 参考及量化后的参考行和；
原小 D 单位行和检查及上述逐元素容差不变。

## 实机验证

验证日期：2026-10-20。

| 项目 | gfx936 | gfx938 |
| --- | --- | --- |
| GPU | BW1000 64G，80 CU | BW1101，64 CU |
| PyTorch / Python | 2.10.0 / 3.10.12 | 2.11.0 / 3.10.12 |
| Torch HIP | 6.3.26113 | 6.3.26113 |
| 独立 JIT 编译 | PASS | PASS |
| 完整主矩阵 | 104/104 PASS | 104/104 PASS |
| 扩展 pytest | 845/845 PASS，0 skip | 845/845 PASS，0 skip |
| stream / 变化输入 Graph / fullgraph compile | PASS | PASS |

完整矩阵包括：

- B=1024×2^i，i=0…9；D=1024/2048/4096，三 dtype，共90组。
- B=1024；D=8192/16384/32768/65536/131072/262144/524288，FP16/BF16，共14组。

最大 FP32 主矩阵输入和输出各8 GiB，所有 shape 均完整执行；参考按行分块以限制内存。
扩展测试覆盖 FP32 大 D、D=16385 成功、D=524289 拒绝、非整齐宽度、空 batch、
输入/输出错位及哨兵、非有限值、次正规数、autograd 拒绝、Meta 和兼容性。
优化的 D8192 路径也单独覆盖非零对齐 offset、变化输入 Graph 和 compile。
这是 Softmax 范围的验证，不代表整库全量回归。

## 当前最终性能

比较 `aiter.softmax_out(out, x)` 与 `torch.softmax(x, dim=-1, out=out)`，
均为 **eager、预分配输出、同一物理 GPU**。JIT 和5次预热不计时；
每轮 GPU event 包含20次完整调用，交替计时顺序，主矩阵7轮取中位数。
事件区间包含 eager 提交间隙；固定输入复用、无 cache flush，不是纯 kernel 或冷缓存计时。

加速比 = PyTorch us / AITER us，小于1表示慢于 PyTorch。

| 架构 | dtype | shape数 | 加速比几何均值 | 快于PyTorch | 加速比范围 |
| --- | --- | ---: | ---: | ---: | ---: |
| gfx936 | BF16 | 37 | 1.522× | 32/37 | 0.707–2.467× |
| gfx936 | FP16 | 37 | 1.577× | 32/37 | 0.710–2.514× |
| gfx936 | FP32 | 30 | 1.260× | 30/30 | 1.092–1.494× |
| gfx938 | BF16 | 37 | 1.408× | 32/37 | 0.604–2.163× |
| gfx938 | FP16 | 37 | 1.461× | 32/37 | 0.584–2.278× |
| gfx938 | FP32 | 30 | 1.506× | 30/30 | 1.220–1.680× |

B=1024、D=8192 的重点用例额外进行3次测量，每次21轮、每轮20次调用；以下为63轮合并中位数：

| 架构 | dtype | AITER us | PyTorch us | 加速比 | 快于PyTorch的轮数 |
| --- | --- | ---: | ---: | ---: | ---: |
| gfx936 | BF16 | 40.79 | 51.42 | 1.261× | 63/63 |
| gfx936 | FP16 | 38.11 | 48.25 | 1.266× | 63/63 |
| gfx938 | BF16 | 47.42 | 57.46 | 1.212× | 63/63 |
| gfx938 | FP16 | 40.94 | 50.49 | 1.233× | 63/63 |

新增大 D 用例的当前完整算子耗时如下，单位为微秒：

| 架构 | D | dtype | AITER us | PyTorch us | 加速比 |
| --- | ---: | --- | ---: | ---: | ---: |
| gfx936 | 32768 | BF16 | 254.90 | 243.20 | 0.954× |
| gfx936 | 32768 | FP16 | 252.00 | 241.70 | 0.959× |
| gfx936 | 65536 | BF16 | 600.60 | 515.73 | 0.859× |
| gfx936 | 65536 | FP16 | 591.94 | 513.50 | 0.867× |
| gfx936 | 131072 | BF16 | 1521.24 | 1114.09 | 0.732× |
| gfx936 | 131072 | FP16 | 1506.87 | 1110.70 | 0.737× |
| gfx936 | 262144 | BF16 | 3436.38 | 2430.73 | 0.707× |
| gfx936 | 262144 | FP16 | 3424.49 | 2429.82 | 0.710× |
| gfx936 | 524288 | BF16 | 7449.34 | 5570.22 | 0.748× |
| gfx936 | 524288 | FP16 | 7406.90 | 5578.56 | 0.753× |
| gfx938 | 32768 | BF16 | 246.02 | 190.14 | 0.773× |
| gfx938 | 32768 | FP16 | 240.89 | 175.67 | 0.729× |
| gfx938 | 65536 | BF16 | 607.54 | 387.97 | 0.639× |
| gfx938 | 65536 | FP16 | 607.73 | 370.86 | 0.610× |
| gfx938 | 131072 | BF16 | 1370.77 | 827.39 | 0.604× |
| gfx938 | 131072 | FP16 | 1373.01 | 802.02 | 0.584× |
| gfx938 | 262144 | BF16 | 2269.70 | 1616.06 | 0.712× |
| gfx938 | 262144 | FP16 | 2137.98 | 1558.93 | 0.729× |
| gfx938 | 524288 | BF16 | 4015.76 | 3084.17 | 0.768× |
| gfx938 | 524288 | FP16 | 3677.59 | 3003.79 | 0.817× |

两架构新增10组大 D 用例均功能通过，但当前均慢于 PyTorch。
原94组另做同进程、同 GPU 的冻结基线/当前实现配对回归，未见显著回退；
逐 shape 中位数最大增幅为 gfx936 0.34%、gfx938 0.23%。
