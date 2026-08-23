# TensorRT-LLM Kimi 模型 PR 优化历史

## 2026-08-23 源码 head 刷新

已复核 TensorRT-LLM 上游 main：
`NVIDIA/TensorRT-LLM@da38c1d2e0dffd073b7dfb6d69e15ee7b45d84a9`。
针对上一记录 head `1b4ffc0291d75a21ad20118e8f44de6e3831f786`
之后的 7 个提交执行了 `git log --name-only`，并逐文件读完本地完整源码 diff。

结果：PR #16805 修复 Kimi 类 PD 流程使用的 disaggregated speculative
draft-token 与 sequence-length 记账，提升为完整审计卡；PR #16763 作为跨模型
启动显存卡保留。其余 4 个提交只修改 CI、fake、Slurm 清理或 Docker 拷贝，不包装成
模型优化证据；第 7 个提交 PR #16677 是 VisualGen/Wan 的 Attention2D + TP，
同样不属于 Kimi LLM 范围。PR #14848 继续保留为上一轮高信号 Kimi runtime 合并。

### PR #16805 - 修复 disaggregated draft-token 记账

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/16805
- 状态/时间: merged / 2026-07-27
- 反查来源: 合并提交
  `93924532ff65e6dce000c1dcee604e585386781b`；已读完 6-commit 增量和该 PR
  的 5 文件完整 diff。
- 代码 diff 已读范围: 5 files，+164/-4。
- 动机: generation-only request 通过 `ContextPhaseParams` 接收 first-gen 与
  draft token，但 decode request 没有接管 draft token，sequence-length 也只统计
  first-gen token。
- 实现要点: `GenericLlmRequest` 在构造或后置 context 设置时接管 draft token；
  统一 helper 统计 first-gen + draft token，decoder sequence-length 使用该总数。
- 代码 diff 细节: `llmRequest.h` 新增 draft-token 接管和统一计数 helper；
  `createNewDecoderRequests.cpp` 替换只统计 first token 的算式，C++/Python 测试覆盖
  构造与后置 assignment。
- 关键代码摘录:

```diff
+        adoptContextPhaseDraftTokens();
+        auto numTokens = static_cast<SizeType32>(
+            contextPhaseParams.getFirstGenTokens().size());
+        numTokens += static_cast<SizeType32>(draftTokens->size());
```

- 已读文件: `llmRequest.h`、`createNewDecoderRequests.cpp`、C++ request 测试、
  Python executor-request 测试和 binding 测试。
- 验证与风险: 需覆盖有/无 draft token、后置 context assignment 和下游长度；
  这是 correctness fix，不是吞吐实测。

### PR #16763 - 统一 phase-1 CUDA graph 清理

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/16763
- 状态/时间: merged / 2026-07-27
- 反查来源: 最终上游提交
  `6046f34e1ac8fc20c2c5553d00a98eb15a172555`；已读完整 2 文件 diff。
- 代码 diff 已读范围: 2 files，+5/-8。
- 动机: KV capacity 估算已经关闭 phase-1 executor 并释放 CUDA graph，再次显式释放
  会重复资源所有权并干扰最终 KV-cache 分配。
- 实现要点: 由 `configure_kv_cache_capacity` 负责 graph/resource teardown，
  重建最终 KV manager 前只清除 profiling attention metadata。
- 代码 diff 细节: 从 `py_executor_creator.py` 删除第二次
  `_release_cuda_graphs()`，保留 `eng.attn_metadata = None`，并解除两个相关配置的
  waive。
- 关键代码摘录:

```diff
-            if eng.attn_metadata is not None:
-                if llm_args.cuda_graph_config is not None:
-                    eng._release_cuda_graphs()
+            if eng is not None:
                 eng.attn_metadata = None
```

- 已读文件: `py_executor_creator.py` 与两个解除 waive 的 DeepSeek-V3Lite 集成用例。
- 验证与风险: 比较 capacity estimation 前后启动显存，并确认 graph resource 只释放一次。

## 2026-06-27 PR 补漏复核

本文的逐 PR diff 审计卡基于 TensorRT-LLM 上游
`HEAD@4164b932c6c8a14d1be85d0fd62e44b7d0171980` 生成；根目录 TensorRT-LLM
history index 已跟踪 2026-06-27 runtime refresh
`aaffa2f9fef3025e0f698d978385a73460344e0b`。本文覆盖 Kimi K2 Thinking /
Kimi K2.5 相关 merged PR，并采用 SGLang 风格的模型实现覆盖、时间线和逐 PR
diff 审计卡。

本轮筛选规则：标题/文件命中 `Kimi`、`kimi_k25`、`KimiK25`、`K2.5`、`K2 Thinking`、`NVFP4`、`multimodal`、`tool_parser`、`reasoning_parser`、`guided decoding`、`spec dec`、`rejection sampling`、`NIXL` 的 merged PR；过滤纯格式化和不影响 Kimi runtime/serve/eval lane 的基础设施 PR。

## 模型实现文件覆盖

| 文件 | 关联 PR |
| --- | --- |
| `docs/source/deployment-guide/deployment-guide-for-kimi-k2-thinking-on-trtllm.md` | [#9711](https://github.com/NVIDIA/TensorRT-LLM/pull/9711) |
| `tensorrt_llm/serve/tool_parser/kimi_k2_tool_parser.py` | [#9830](https://github.com/NVIDIA/TensorRT-LLM/pull/9830) |
| `tensorrt_llm/_torch/models/modeling_deepseekv3.py` | [#11777](https://github.com/NVIDIA/TensorRT-LLM/pull/11777), [#12788](https://github.com/NVIDIA/TensorRT-LLM/pull/12788) |
| `tensorrt_llm/_torch/auto_deploy/models/custom/modeling_kimi_k2.py` | [#11780](https://github.com/NVIDIA/TensorRT-LLM/pull/11780) |
| `examples/auto_deploy/model_registry/configs/kimi_k2.yaml` | [#11780](https://github.com/NVIDIA/TensorRT-LLM/pull/11780) |
| `tensorrt_llm/_torch/models/modeling_kimi_k25.py` | [#12788](https://github.com/NVIDIA/TensorRT-LLM/pull/12788), [#14379](https://github.com/NVIDIA/TensorRT-LLM/pull/14379), [#15180](https://github.com/NVIDIA/TensorRT-LLM/pull/15180) |
| `tensorrt_llm/llmapi/reasoning_parser.py` | [#13801](https://github.com/NVIDIA/TensorRT-LLM/pull/13801) |
| `tensorrt_llm/_torch/modules/embedding.py` | [#15233](https://github.com/NVIDIA/TensorRT-LLM/pull/15233) |
| `tests/unittest/_torch/modeling/test_modeling_kimi_k25.py` | [#12788](https://github.com/NVIDIA/TensorRT-LLM/pull/12788) |
| `tests/scripts/perf-sanity/disaggregated/gb200_kimi-k25-thinking-fp4_*.yaml` | [#15443](https://github.com/NVIDIA/TensorRT-LLM/pull/15443) |

## PR 覆盖总览

- 本轮审计 PR 数: 10
- 文件反查命令: `git log --name-only -- <model-files>`
- diff 来源: `gh pr diff` / GitHub Pull Request files API patch，本地缓存 `/tmp/model_pr_diffs/tensorrt_llm/pr*.diff`
- 已读 patch 行数: 8,414
- TensorRT-LLM Kimi 关键形态: Blackwell/GB200 deployment guide、OpenAI tool parser、K2.5 text NVFP4、AutoDeploy Kimi K2.5、multimodal vision/video path、reasoning parser、speculative/guided decoding、rejection sampling embedding mask、NIXL disaggregated perf lane。

## 时间线

| 日期 | PR | 状态 | 标题 | 主要文件 |
| --- | --- | --- | --- | --- |
| 2025-12-05 | [#9711](https://github.com/NVIDIA/TensorRT-LLM/pull/9711) | merged | Deployment Guide for Kimi K2 Thinking on TensorRT LLM - Blackwell | deployment guide |
| 2025-12-12 | [#9830](https://github.com/NVIDIA/TensorRT-LLM/pull/9830) | merged | Support tool parser for Kimi K2 | OpenAI server/tool parser |
| 2026-03-04 | [#11777](https://github.com/NVIDIA/TensorRT-LLM/pull/11777) | merged | Add Kimi-K2.5 text model support (NVFP4) | `modeling_deepseekv3.py`, accuracy tests |
| 2026-03-05 | [#11780](https://github.com/NVIDIA/TensorRT-LLM/pull/11780) | merged | AutoDeploy onboarding agent + Kimi K2.5 AD modeling code | AutoDeploy Kimi model/config/tests |
| 2026-05-11 | [#13801](https://github.com/NVIDIA/TensorRT-LLM/pull/13801) | merged | Add reasoning parser for kimi-k2.5 and enable auto flow | command/reasoning parser |
| 2026-05-14 | [#12788](https://github.com/NVIDIA/TensorRT-LLM/pull/12788) | merged | Add Kimi K2.5 multimodal vision support | `modeling_kimi_k25.py`, multimodal eval/tests |
| 2026-05-22 | [#14379](https://github.com/NVIDIA/TensorRT-LLM/pull/14379) | merged | Fix Kimi_k25 with spec dec | `modeling_kimi_k25.py` |
| 2026-06-17 | [#15233](https://github.com/NVIDIA/TensorRT-LLM/pull/15233) | merged | Fix embedding vocab mask for rejection sampling in Kimi-K2.5 | `embedding.py` |
| 2026-06-23 | [#15443](https://github.com/NVIDIA/TensorRT-LLM/pull/15443) | merged | Un-waive K2.5 Thinking FP4 disagg-NIXL tests | waives and perf-sanity YAML |
| 2026-06-25 | [#15180](https://github.com/NVIDIA/TensorRT-LLM/pull/15180) | merged | Add necessary methods for guided decoding in Kimi K2.5 | `modeling_kimi_k25.py` |

## 逐 PR diff 审计卡

### PR #14848 - DeepSeek-V3.2 / Kimi-K2.5 的 RMSNorm NVFP4 量化融合

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/14848
- 状态/时间: merged / 2026-07-15
- 反查来源: `git log --name-only -- <model-files>`，并结合最终上游提交和 PR 正文。
- 代码 diff 已读范围: 完整 2,487 行 diff，16 个文件，+1993/-101。
- 动机: 静态 NVFP4 Kimi-K2.5 在兼容 Linear 前会分别启动 RMSNorm 和激活量化 kernel，既落地中间归一化张量，也多一次 launch。
- 实现要点: 新增 Blackwell 专用 C++/CUDA 算子，把可选 residual-add、RMSNorm 和 NVFP4 量化融合；同时支持紧凑与按行有 stride 的输入，需要其他消费者时还能返回未量化 norm，并把合适的 RMSNorm→Linear 边接到融合结果。
- 代码 diff 细节: `rmsNormFp4QuantKernel` 同时完成 reduction、E2M1 打包和 E4M3 block scale 输出；Python dispatch 对不支持的架构/shape 保持原路径。
- 关键代码摘录:

```diff
+// Fused (optional residual-add +) RMSNorm + NVFP4 input-quantize.
+__global__ void rmsNormFp4QuantKernel(RmsNormFp4QuantParams params)
+{
+    float const denom = rsqrtf(acc / params.hidden_size + params.eps);
+    uint32_t const quant_val = cvt_warp_fp16_to_fp4<T, kSfVecSize, false>(
+        pv, sf_scale, sf_out_ptr);
+}
```

- 已读文件: runtime：`cpp/tensorrt_llm/kernels/rmsNormFp4QuantKernels.{cu,h}`、`cpp/tensorrt_llm/thop/rmsNormFp4Quant.cpp`、`tensorrt_llm/_torch/modules/{rms_norm,linear,mla}.py`、`modeling_deepseekv3.py`；测试：`test_fused_rmsnorm_fp4_quantize.py`、`test_fp4_num_tokens_slice.py`、B200 test database。
- 验证与风险: 融合 FP4 epilogue 仅支持 SM10.x；验证同时比较 packed FP4 与反 swizzle 后的 scale factor，覆盖 stride 输入和不修改输入，并区分 RMSNorm 舍入漂移与对返回 norm 重新量化时的 bit-exact 要求。

### PR #9711 - Deployment Guide for Kimi K2 Thinking on TensorRT LLM - Blackwell

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/9711
- 状态/时间: merged / 2025-12-05
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 1 个文件，+309/-0，本地 patch 534 行。
- 动机: 给 Kimi K2 Thinking NVFP4 在 DGX B200 与 GB200 NVL72 上的部署提供官方路径。
- 实现要点: 文档加入 Docker build/run、`trtllm-serve nvidia/Kimi-K2-Thinking-NVFP4`、8-way EP/attention DP、SLURM wide EP 和 disaggregated serving 示例。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+trtllm-serve nvidia/Kimi-K2-Thinking-NVFP4 \
+--extra_llm_api_options
```

- 已读文件: `deployment-guide-for-kimi-k2-thinking-on-trtllm.md`
- 验证与风险: SOTA loop 里 TensorRT-LLM Kimi lane 要标注 Blackwell/GB200 和 disagg 形态；文档命令不是 engine 后端的等价物。

### PR #9830 - Support tool parser for Kimi K2

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/9830
- 状态/时间: merged / 2025-12-12
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 5 个文件，+374/-1，本地 patch 528 行。
- 动机: Kimi K2 OpenAI-compatible serving 需要正确解析 tool call，否则 agentic workload 的功能/评分会偏离。
- 实现要点: 新增 `kimi_k2_tool_parser.py`，接入 OpenAI server postprocess handler 和 parser factory，并补工具调用测试。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+from .kimi_k2_tool_parser import KimiK2ToolParser
+class KimiK2ToolParser(BaseToolParser):
+        "kimi_k2": KimiK2ToolParser,
```

- 已读文件: `openai_server.py`, `postprocess_handlers.py`, `kimi_k2_tool_parser.py`, `tool_parser_factory.py`, tests
- 验证与风险: 对 agentic benchmark，tool parser 是 correctness surface；不能只比较 tokens/s。

### PR #11777 - Add Kimi-K2.5 text model support (NVFP4)

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/11777
- 状态/时间: merged / 2026-03-04
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 2 个文件，+96/-0，本地 patch 532 行。
- 动机: TensorRT-LLM PyTorch backend 需要把 Kimi-K2.5 text NVFP4 接入已有 DeepSeekV3-style runtime。
- 实现要点: 在 `modeling_deepseekv3.py` 中适配 Kimi K2.5 text model，并新增 accuracy refs/tests。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+MODEL_NAME = "moonshotai/Kimi-K2.5"
+quant_algo: NVFP4
```

- 已读文件: `modeling_deepseekv3.py`, accuracy tests/refs
- 验证与风险: Kimi K2.5 text 与 Kimi multimodal 不是同一验证面；benchmark 记录要区分 text-only 和 VLM。

### PR #11780 - AutoDeploy onboarding agent + Kimi K2.5 AD modeling code

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/11780
- 状态/时间: merged / 2026-03-05
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 9 个文件，+2190/-9，本地 patch 2,807 行。
- 动机: Kimi K2.5 需要 AutoDeploy modeling code，而不是仅依赖通用 PyTorch model wrapper。
- 实现要点: 新增 `modeling_kimi_k2.py`、registry config、MLA custom ops 和 AutoDeploy tests，并加入 agent/scaffolding 文件。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+model_factory: KimiK2ForCausalLM
+flashinfer_mla
```

- 已读文件: agent scaffold files, `configs/kimi_k2.yaml`, `flashinfer_mla.py`, `torch_backend_mla.py`, `modeling_kimi_k2.py`, AD tests
- 验证与风险: TensorRT-LLM Kimi 竞品路径可能是 AutoDeploy，而不是普通 model wrapper；SGLang loop 要记录 backend/API 入口。

### PR #13801 - Add reasoning parser for Kimi-K2.5 and enable auto flow

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/13801
- 状态/时间: merged / 2026-05-11
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 2 个文件，+5/-1，本地 patch 47 行。
- 动机: Kimi-K2.5 thinking output 需要自动选择正确 reasoning parser。
- 实现要点: `commands/serve.py` 的 auto-detect hint 加入 `kimi_k2/kimi_k25`，`reasoning_parser.py` 注册 `kimi_k25` 且 `reasoning_at_start=True`。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+"kimi_k25": "kimi_k25",
+@register_reasoning_parser("kimi_k25", reasoning_at_start=True)
```

- 已读文件: `commands/serve.py`, `llmapi/reasoning_parser.py`
- 验证与风险: AIME/agentic 输出解析不同会改变分数；公平对比必须记录 reasoning parser。

### PR #12788 - Add Kimi K2.5 multimodal vision support

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/12788
- 状态/时间: merged / 2026-05-14
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 12 个文件，+2912/-64，本地 patch 3,536 行。
- 动机: Kimi K2.5 需要 text/image/video multimodal path，包括 vision encoder、processor、hashing fallback 和 multimodal eval。
- 实现要点: 新增 `KimiK25ForConditionalGeneration`、`KimiK25VisionModel`、input processor、vision attention/projector 结构，接入 multimodal eval/test。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+@register_auto_model("KimiK25ForConditionalGeneration")
+class KimiK25ForConditionalGeneration(PreTrainedModel):
+    "video_placeholder": "<|kimi_k25_video_placeholder|>",
```

- 已读文件: `modeling_kimi_k25.py`, `modeling_deepseekv3.py`, eval wrappers, multimodal tests, `test_modeling_kimi_k25.py`
- 验证与风险: 多模态 Kimi 比 text-only 多了 vision encoder、placeholder expansion、hashing fallback；profile 要分 stage。

### PR #14379 - Fix Kimi_k25 with spec dec

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/14379
- 状态/时间: merged / 2026-05-22
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 1 个文件，+53/-35，本地 patch 187 行。
- 动机: Kimi K2.5 在 speculative decoding 下 multimodal params 和 `lm_head` 访问不完整。
- 实现要点: `forward` 显式接收 `multimodal_params`，按 `attn_metadata.num_contexts` 切 context params，并增加 `lm_head` 代理方法。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+multimodal_params: Optional[List[MultimodalParams]] = None
+def lm_head(self): return self.llm.lm_head
```

- 已读文件: `tensorrt_llm/_torch/models/modeling_kimi_k25.py`
- 验证与风险: SGLang 对标 speculative decoding 时，要确认 multimodal context-only 路径是否正确处理。

### PR #15233 - Fix embedding vocab mask for rejection sampling in Kimi-K2.5

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/15233
- 状态/时间: merged / 2026-06-17
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 1 个文件，+15/-8，本地 patch 129 行。
- 动机: FlashInfer rejection kernel 会为未接受 token pad 非 vocab 值，如果 embedding mask 不 clamp，会在 Kimi-K2.5 rejection sampling 中越界。
- 实现要点: 在 `pre_comm_embedding_ops` 中先 mask/clamp 输入，再做 `F.embedding`。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+# flashinfer's rejection kernel pads non-accepted tokens
+        input_, input_mask = get_masked_input_and_mask(
+            input_,
+            0,
+            weight.shape[0],
+        )
```

- 已读文件: `tensorrt_llm/_torch/modules/embedding.py`
- 验证与风险: speculative/rejection sampling 的 correctness 风险在 embedding 前处理，profile 表很难直接暴露。

### PR #15443 - Un-waive K2.5 Thinking FP4 disagg-NIXL tests

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/15443
- 状态/时间: merged / 2026-06-23
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 2 个文件，+2/-3，本地 patch 86 行。
- 动机: Kimi K2.5 Thinking FP4 disaggregated NIXL e2e/gen_only lane 已足够稳定，可以从 waive 列表移除并拉长 KV transfer timeout。
- 实现要点: 删除 waives 中三条 Kimi NIXL skip，并在 perf-sanity YAML 设置 `kv_transfer_timeout_ms: 600000`。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+kv_transfer_timeout_ms: 600000
```

- 已读文件: `waives.txt`, `gb200_kimi-k25-thinking-fp4_8k1k_con4096_ctx1_dep4_gen1_dep16_eplb0_mtp0_ccb-NIXL.yaml`
- 验证与风险: disagg/NIXL lane 与单机 serving 完全不同；SOTA loop 要单独建 workload bucket。

### PR #15180 - Add necessary methods for guided decoding in Kimi K2.5

- 链接: https://github.com/NVIDIA/TensorRT-LLM/pull/15180
- 状态/时间: merged / 2026-06-25
- 反查来源: `git log --name-only -- <model-files>` 与 GitHub Pull Request files API。
- 代码 diff 已读范围: 1 个文件，+3/-0，本地 patch 28 行。
- 动机: Kimi K2.5 wrapper 缺少 guided decoding 需要的代理方法。
- 实现要点: 在 `KimiK25ForConditionalGeneration` 上透传 `set_guided_decoder` 到内部 LLM。
- 代码 diff 细节: 见上方已读范围和下方摘录，保留本卡审计到的文件级变化。
- 关键代码摘录:

```diff
+def set_guided_decoder(self, *args, **kwargs):
+    return self.llm.set_guided_decoder(*args, **kwargs)
```

- 已读文件: `tensorrt_llm/_torch/models/modeling_kimi_k25.py`
- 验证与风险: guided decoding 会改变 decode control flow；benchmark 需要标注是否启用。
