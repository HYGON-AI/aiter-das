# gfx946 采样验证

`test_sampling.py` 覆盖 `top_p_sampling_from_probs` 和 `top_k_top_p_sampling_from_probs`。测试及参考只依赖永久源码、Torch 与标准库，不依赖临时文件。

在已配置的 Perf Model 容器中，将 `AITER_REPO` 设置为本次源码根目录：

```bash
export ROCM_PATH=/opt/rocm PMD_PATH=/opt/rocm/pmd GPU_ARCHS=gfx946
export HIP_CLANG_PATH=/wksp/llvm-project/build-6.3.3/bin
export PATH=/opt/rocm/bin:$HIP_CLANG_PATH:/opt/hyhal/bin:$PATH
export LD_LIBRARY_PATH=/opt/rocm/lib:/opt/rocm/pmd:${LD_LIBRARY_PATH:-}
export PYTHONPATH="$AITER_REPO" AITER_ENABLE_SUPERNODE_AR=0
export GPU_ARGS="['--num-gpu=1']" GPU_DFLAGS="['StatLog']"
unset AITER_JIT_DIR AITER_REBUILD HIP_VISIBLE_DEVICES ROCR_VISIBLE_DEVICES CUDA_VISIBLE_DEVICES
test_py="$AITER_REPO/op_tests/gfx946_tests/sampling/test_sampling.py"
```

各次运行分别进入独立结果目录，避免 `m5out` 覆盖：

```bash
GPU_CHIP=sb python "$test_py" --suite build --rebuild --json build.json
GPU_CHIP=sb python "$test_py" --suite all --expect-xcds 1 --json single.json
GPU_CHIP=sbx2 python "$test_py" --suite all --expect-xcds 2 --json dual.json
GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode linear --chunk 2 --json linear2.json
GPU_CHIP=sbx2 python "$test_py" --suite route --expect-xcds 2 --die-mode off --json off.json
```

`--ops top_p` / `--ops joint` 单独选择接口；`--list` 列出数值用例且不初始化 GPU；`--case top_p_tail17` 单独运行指定用例。默认 `quick` 每个接口一例；`full` 每个接口17例；`route` 覆盖1024/512线程、两种scan和多个workgroup；`rng` 检查可重现性、generator状态与框架入口；`negative` 检查元数据和启动配置；`all` 包含后三组。`build` 只编译/加载，不运行采样kernel。

CPU 参考按原始概率计算严格更大概率的元素数和质量；joint 同时施加两种限制，支持并列概率，不使用先 top-k 再归一化的参考。输入为可精确表示的离散概率；覆盖标量/逐行参数、重排/重复indices、词表1/2/3/17/4097、零概率支撑、并列、贪心退化、关闭过滤、FP16/BF16及非连续Python输入、空输出。原生接口检查输出保护区；所有数值用例检查输入保护区。RNG检查比较固定seed/offset、显式RNG不推进generator、generator推进与显式offset结果一致。小样本功能验证不代表统计无偏性证明。

框架入口使用 `torch.ops.aiter.top_p_sampling_from_probs(probs, indices, p_tensor, p_scalar, deterministic=True)` 及 joint 对应的 k/p tensor-scalar 参数对。测试对照原有 Python API 并检查 Meta 输出形状；不声称完成模型集成或 Graph 验证。

测试查询 HSA 实际 XCD 数；`sb` 应报告1，`sbx2` 应报告2，且只暴露一张 GPU。初始化后移除 `GPU_CHIP`，启动器继续依靠运行时拓扑决策。`AITER_SAMPLING_DIE_MODE/CHUNK/MASK` 分别控制启动方式、分块和掩码；测试仅接受全die掩码0。`off` 是普通启动API，不能用它模拟单die。

`DUT_BEGIN/END` 标记与 `[AITER sampling launch]` 日志定位被测dispatch。数值通过之外，还应核对对应 `m5out/0/<dispatch>/stats.txt` 中各XCD的 `completedWGs`，确保总数等于grid且显式多die路径确实跨XCD执行。JSON保存拓扑、源码/SO哈希、逐例样本和RNG状态，全部完成才写 `PASS`；`RUNNING` 不计为通过。

在真实 gfx936/gfx938 环境，使用对应编译器和空闲GPU，取消PMD变量，传入 `--require-arch gfx936` 或 `gfx938`；不传 `--expect-xcds`。本测试没有性能计时，PMD墙钟时间不能作为GPU性能。
