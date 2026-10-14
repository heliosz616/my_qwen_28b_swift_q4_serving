# 实现与构建

网关先校验真实连接来源和 Bearer Key，再把用户映射到独立 Session 命名空间。全局生成锁保证单流，模型目录限定可请求的模型。监督进程负责加载、健康检查、崩溃后恢复和模型切换；运行时文件按构建 manifest 校验。每个模型使用独立快照目录，缓存配额和 TTL 限制磁盘使用。

主模型与 MTP 的状态共同保存/恢复，避免只有主模型 KV 恢复而预测头上下文丢失。前缀编辑按实际公共前缀处理；不能仅凭 Session ID 宣称命中。思考和工具消息沿原生模板处理，支持 SSE 分块。

固定 llama.cpp b11429 commit `d81235049384534c167caea52b85a694f6103d14`。`qwen27b/patches/runtime.patch` 从已验证运行时源代码导出，包含 checkpoint、热缓存延迟、CUDA GQA 复用、传输观测、MTP 状态保存/恢复、Vulkan 主机设备选择和 MTP prefill 调度。补丁内含上游测试和版权上下文，保留许可证，不包含模型或本机数据。

MTP prefill 无预测输出的批次只构建必要 KV；`HUMANLIKE_MTP_NO_PIPELINE=1` 只禁用 MTP 上下文的流水线缓冲，主模型仍使用双 GPU 流水线。MTP 预测头在 RX 9070，不跨 GPU 拆分。图形驱动、设备索引及链路带宽均会影响结果。

构建脚本从同一 patched source 分别生成 server、CUDA 和 Vulkan 插件，再组合匹配 ABI 的运行时。官方同版本发布资产用于提供运行时依赖。工具链需由部署者预先安装；不修改驱动或 BIOS。重新构建前停止使用该目录的服务。

`runtime/gpu_lease.py` 使用 Windows 文件锁防止共享路径的监督进程同时占用 GPU。它不属于跨机器调度系统。发布只包含源码，安装生成的文件不纳入版本控制。
