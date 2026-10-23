# Gap Analysis 子报告 — Extension（扩展机制 / 插件生态 / 跨语言互操作）

> 系列：自研多模态数据库 + RAG「自研 vs 业界」差距分析（13 篇子报告之十一）
> 本篇：扩展机制（Plugin Manager 动态加载 + REST/gRPC Server + 优化器代价模型插件化 + 分布式查询 RPC + 成本模型 Cost Estimation）
> 时间：2026-10-16
> 状态：初稿
> 上游依赖：`archive/.superpowers/sdd/gap-task-1-inventory.md` §11 extension
> 对照 wiki：
> - `docs/db-wiki/extension/arrow.md`（Apache Arrow 17/18，跨语言列式内存格式 + IPC + Flight + Compute Kernel + 多语言 SDK）
> - `docs/db-wiki/extension/datafusion.md`（Apache DataFusion 41/42，Rust 原生 SQL 执行引擎 + TableProvider + UDF 注册 + Ballista 分布式 + Flight SQL）
> - `docs/db-wiki/extension/velox.md`（Meta Velox 0.36/0.37，C++ 向量化执行 + Operator + Expression + Connector framework + Arrow 桥接）
> 自身参考：`2026-08-29-multimodal-db-gap-analysis.md`（旧版顶层报告，本篇不替代，仅作纵向对照）

## 摘要（TL;DR）

自研扩展栈已经具备 **「Plugin Manager（动态库 LoadLibrary/GetProcAddress）+ REST/gRPC Server + 优化器代价估算插件化（optimizer_cost）+ 分布式查询（distributed_query）+ RPC 流式（rpc_stream）+ TSO + Percolator + 死锁检测」的接口矩阵**，覆盖度评级 **B**——本篇是 13 篇子报告里「扩展机制 / 跨语言互操作 / 自定义算子挂载 / 第三方插件生态」四个面向都覆盖的复合篇。与 Arrow 的差距集中在 **「跨语言列式内存格式（Array/RecordBatch/Table）+ IPC Stream + Arrow Flight RPC + Compute Kernel（cast/filter/take/hash_join/sort/aggregate）+ PyCapsule C ABI 零拷贝 + 多语言 SDK（C++/Python/Rust/Java/Go/R/JS/C#）+ Compute Kernels 全覆盖 + Iceberg/Delta Lake 集成」**；与 DataFusion 的差距集中在 **「Rust 原生 SQL 执行引擎 + Apache Arrow RecordBatch + SessionContext + TableProvider trait + LogicalPlan/PhysicalPlan 二阶段 + 自定义 UDF/UDAF/UDWF + Query Optimizer cost-based + Ballista 分布式 K8s 调度 + Substrait IR 跨引擎 + 30+ 内置函数 + 异步 tokio runtime + C API + datafusion-python / datafusion-cli / datafusion-server」**；与 Velox 的差距集中在 **「C++20 向量化执行 + Operator + Expression 双抽象 + RowVector / BaseVector + Adaptive Hash Join + Spill-to-Disk + Function Registry + MemoryPool 层级（root/query/task/operator）+ Connector framework（hive/iceberg/tpcds）+ Presto/Gluten/Doris 三套下游 + Arrow Bridge（arrow::Array ↔ velox::RowVector）+ Driver/Task Pipeline」**。

简言之：自研 extension 是 **「插件动态加载 + REST/gRPC 暴露 + 优化器 cost 插件化 + 分布式查询 RPC + TSO + Percolator」的 C 端嵌入式扩展接口矩阵**，但 **无** 「Apache Arrow 跨语言内存格式（Array/RecordBatch/Schema/DataType）+ IPC Stream + Arrow Flight RPC（DoGet/DoPut/DoExchange）+ Compute Kernel 全集（cast/filter/take/sort/hash_join/aggregate）+ TableProvider / SessionContext / ExecutionPlan 三件套 + UDF/UDAF/UDWF 注册表 + Optimizer Rule + Cost-based Optimizer + Substrait IR 跨引擎互转 + Vector / Buffer 共享 + Function Registry + MemoryPool Spill + Connector Factory + Driver/Task 异步 Pipeline + Arrow C ABI 零拷贝 + 多语言 SDK（C++/Python/Rust/Java/Go）+ 商业模拟器（Dremio Sonar / Voltron Data）+ 公开 Bench 基准（ClickBench 30/43、TPC-H SF100）+ 5+ 语言产品（如 InfluxDB IOx / GreptimeDB / Apache Doris 基于 Velox 重写）」。Arrow 是「跨语言列式内存标准 + 跨语言零拷贝 + 800+ 项目上下游」的工业事实基础，DataFusion 是「Rust 原生 SQL + Arrow + 嵌入式 + Ballista 分布式 + ASF 顶级」的现代化代表，Velox 是「C++ 向量化 + Operator + Expression + Arrow 共享 + LF AI Data」的 Meta 内核级标杆。扩展方向应以 **「引入 Apache Arrow C++ 作为列式内存 + IPC 序列化底座 + 暴露 Arrow Flight Server（DoGet 返回 RecordBatch）+ 集成 DataFusion SessionContext + TableProvider 适配 + UDF 注册表 + Optimizer Rule 插件 + Velox 选型实验（Presto on Velox 学习）+ Compute Kernel 集成 + 5+ 语言 SDK（C++/Python/Rust/Java/Go）+ Ballista 分布式调度探索（K8s optional）+ compute/compute/optimizer 三大模块插件化」** 为最高优先级，因为它直接决定了 `engineering/src/db/ecosystem/` + `engineering/src/db/distributed/query/` 能否从「插件加载 + REST/gRPC 暴露 + 优化器 cost 插件化」跨越到「列式内存标准 + 跨语言 SDK + SQL 自定义 UDF + 分布式 query 调度 + 向量化执行」。

---

## 1. 自研现状

> 引用 `archive/.superpowers/sdd/gap-task-1-inventory.md` §11 extension（行 104-112 索引），并补充定位说明。

1. **Plugin Manager（插件管理器，覆盖度 B+）**：
   - `engineering/src/db/ecosystem/plugin_manager.c`（约 320 行）实现 **动态库加载器**（Windows `LoadLibraryW` + `GetProcAddress`，Linux/macOS `dlopen` + `dlsym`），支持插件的「load/unload/lookup/find/init/exit」；
   - `engineering/src/db/ecosystem/CMakeLists.txt`（构建为 `ecosystem_lib` STATIC 库 + 可选 plugin 动态库示例）；
   - 公共头 `engineering/include/db/ecosystem/plugin_manager.h` 暴露 `plugin_load/plugin_unload/plugin_lookup/plugin_get_error/plugin_init/plugin_exit` 接口（统一抽象平台动态库调用）。

2. **REST Server（覆盖度 B）**：
   - `engineering/src/db/ecosystem/rest_server.c`（约 460 行）实现 **HTTP REST 接口**（基于 `cpp-httplib` + JSON request/response），暴露 `/query` `/health` `/metrics` `/plugin/list` 等端点；
   - 公共头 `engineering/include/db/ecosystem/rest_server.h` 声明 `rest_server_init/run/shutdown/register_handler`。

3. **gRPC Server（覆盖度 B）**：
   - `engineering/src/db/ecosystem/grpc_server.c`（约 580 行）实现 **gRPC 接口**（`.proto` 定义 Query/Insert/Update/Delete/Stream 流式）+ Protobuf 序列化；
   - 公共头 `engineering/include/db/ecosystem/grpc_server.h` 暴露 `grpc_server_init/serve/shutdown/add_service`。

4. **优化器代价模型（覆盖度 B）**：
   - `engineering/include/db/optimizer_cost.h`（约 120 行）声明 **cost 模型接口**（`optimizer_cost_estimate_t` + `optimizer_cost_register_hook`）；
   - `engineering/src/db/optimizer/optimizer_cost.c`（约 250 行）实现 **基础 cost 估算**（seq scan / index scan / hash join / nested loop join / sort / aggregate cost 函数）；
   - 公共头 `engineering/include/db/optimizer/optimizer.h` 暴露完整优化器（`optimizer_optimize` + `optimizer_register_rule`）。

5. **优化器并行扩展（覆盖度 B）**：
   - `engineering/src/db/optimizer/optimizer_parallel.c`（约 360 行）实现 **并行优化器规则**（`ParallelScanRule` + `ParallelHashJoinRule` + `ParallelAggregateRule`），可注册自定义优化器规则。

6. **分布式查询（覆盖度 B）**：
   - `engineering/src/db/distributed/query/distributed_query.c`（约 380 行）实现 **分布式 SQL 协调**（解析 SQL → LogicalPlan → 物理切分 → 多 shard 路由 → 合并结果），与 TSO + Percolator + 死锁检测协同；
   - 公共头 `engineering/include/db/distributed/distributed_query.h` 暴露 `distributed_query_execute` + `distributed_query_cancel`。

7. **RPC 流式管道（覆盖度 B）**：
   - `engineering/src/db/distributed/rpc/rpc_stream.c`（约 320 行）实现 **gRPC/Thrift 流式管道**（基于 `grpc::ClientReaderWriter`），支持双向流 + 背压 + 自动重连。

8. **TSO + Percolator + 死锁检测（覆盖度 B）**：
   - `engineering/include/db/distributed/tso.h` 声明 **Timestamp Oracle**（全局单调递增时间戳分配）；
   - `engineering/include/db/distributed/percolator.h` 声明 **Percolator 2PC 分布式事务**（percolator 风格 + OCC + 列存 + lock 列 + write 列）；
   - `engineering/include/db/distributed/deadlock.h` 声明 **死锁检测**（WFG 图 + 周期检测）。

9. **CMake 配置（构建集成）**：
   - `engineering/src/db/ecosystem/CMakeLists.txt`（构建 `ecosystem_lib` STATIC 库 + `grpc_server` + `rest_server` 多个目标）；
   - `engineering/src/db/distributed/query/CMakeLists.txt`（构建 `distributed_query_lib` STATIC 库）。

10. **缺失模块（明确标注）**：与 Arrow / DataFusion / Velox 对比，自研 extension **无** Apache Arrow `Array/RecordBatch/Table/Schema/Field/DataType` 列式内存格式、**无** Arrow IPC 流式序列化（FlatBuffers 消息）、**无** Arrow Flight RPC（gRPC + FlatBuffers 的微服务级数据传输协议，DoGet/DoPut/DoExchange/DoAction 4 类）、**无** Arrow Compute Kernel（cast/filter/take/sort/hash_join/aggregate/sort_indices），**无** PyCapsule 跨语言零拷贝（Python ↔ C++），**无** DataFusion SessionContext + TableProvider trait + LogicalPlan/PhysicalPlan 二阶段、**无** DataFusion UDF/UDAF/UDWF 注册表与 30+ 内置函数、**无** Velox Operator + Expression 双抽象、**无** Velox MemoryPool 分层（root/query/task/operator）+ Spill-to-Disk、**无** Velox Connector framework（hive/iceberg/tpcds/cudf）+ Driver/Task 模型、**无** Arrow C ABI（`arrow::export_arrow_array/import_arrow_array`）外部语言嵌入、**无** 多语言 SDK（C++/Python/Rust/Java/Go/R/JS/C# bindings）、**无** Flight SQL 协议（`arrow-flight-sql` JDBC 桥接）、**无** Substrait IR 跨引擎互转、**无** Query Optimizer cost-based（统计信息 + Histograms + Limit PushDown + Information Flow）、**无** 第三方插件公开市场 / 插件文档 / 插件示例 / SDK、**无** Iceberg/Delta Lake/Hudi 适配层、**无** 公开 Bench 基准（ClickBench / TPC-H / H2O.ai）、**无** Ballista 分布式调度（K8s optional）、**无** Async Runtime 协程式调度（tokio / Folly coroutine）、**无** MemoryPool Spill to Disk（Velox 风格）、**无** Function Registry（presto_fn / spark_fn / sparksql_fn / hll_fn / tpcds_fn）、**无** Adaptive Hash Join（自适应驱动 + 串行化 + 阈值切 Streaming Hash Join）、**无** Sort + TopK 优化（partial sort / external merge sort）、**无** Python DataFrame API（datafusion-python）、**无** Serverless 部署（Cloudflare Workers Analytics Engine）。

**关键路径速查**（与本报告后续引用一致）：

- 插件管理：`engineering/src/db/ecosystem/plugin_manager.c` + `engineering/include/db/ecosystem/plugin_manager.h`
- REST Server：`engineering/src/db/ecosystem/rest_server.c` + `engineering/include/db/ecosystem/rest_server.h`
- gRPC Server：`engineering/src/db/ecosystem/grpc_server.c` + `engineering/include/db/ecosystem/grpc_server.h`
- 生态构建：`engineering/src/db/ecosystem/CMakeLists.txt`
- 优化器代价：`engineering/src/db/optimizer/optimizer_cost.c` + `engineering/include/db/optimizer_cost.h`
- 优化器：`engineering/src/db/optimizer/optimizer.c` + `engineering/include/db/optimizer/optimizer.h`
- 优化器并行：`engineering/src/db/optimizer/optimizer_parallel.c`
- 分布式查询：`engineering/src/db/distributed/query/distributed_query.c` + `engineering/include/db/distributed/distributed_query.h`
- 分布式构建：`engineering/src/db/distributed/query/CMakeLists.txt`
- RPC 流式：`engineering/src/db/distributed/rpc/rpc_stream.c` + `engineering/include/db/distributed/rpc_stream.h`
- TSO：`engineering/include/db/distributed/tso.h`
- Percolator：`engineering/include/db/distributed/percolator.h`
- 死锁检测：`engineering/include/db/distributed/deadlock.h`
- MVCC-TS：`engineering/include/db/distributed/mvcc_ts.h`
- 分布式 RPC：`engineering/include/db/distributed/rpc.h`
- 分布式事务：`engineering/include/db/distributed/txn/`

---

## 2. 业界主流做法

下面三篇对照项目分别代表「跨语言列式内存格式 + 多语言 SDK + 800+ 上下游」「Rust 原生 SQL 执行引擎 + Ballista 分布式 + ASF 顶级」「C++ 向量化统一执行 + Operator + Expression + Arrow 共享」三条路线，重点对比「内存模型 / 注册表与扩展机制 / 跨语言边界 / 分布式 / 优化器」五个维度。

### 2.1 Apache Arrow 17/18（跨语言列式内存标准 + 800+ 项目事实基础）

详细：`docs/db-wiki/extension/arrow.md`

- **定位**：由 Apache 软件基金会维护的「跨语言、平台无关的列式内存格式标准」，提供共享内存数据结构（`arrow::Array` / `RecordBatch` / `Table` / `Schema`），可在 C++ / Python / Rust / Java / Go / JS / C# 等十余种语言间零拷贝共享；IPC 协议通过 FlatBuffers 消息流式传输；Arrow Flight RPC（基于 gRPC + FlatBuffers）定位为「Arrow 数据的网络层」。
- **列式内存（核心抽象）**：每列独立 buffer（`data` + `validity` + `offsets`）+ 行号 = 全局唯一 + `RecordBatch::Slice` 零拷贝 + Table = RecordBatch 列表（ChunkedArray 利于并行）+ 类型系统 Int8/16/32/64 + Utf8 + Binary + List + Struct + Map + Dictionary + Decimal128 + Union + FixedSizeBinary。
- **跨语言零拷贝**：通过 **C ABI**（`arrow::export_arrow_array/import_arrow_array`）+ **PyCapsule 协议**（PEP 603，Python ↔ C++ 共享同一块内存地址）+ Linux 共享内存 IPC（`/dev/shm`）实现。
- **Arrow Flight RPC**：协议栈基于 gRPC + FlatBuffers，主打「大数据并行流式 RPC」；RPC 方法 `Handshake` + `ListFlights` + `GetFlightInfo` + `DoGet`（拉数据流，支持多 Endpoint 并行）+ `DoPut`（推数据流）+ `DoExchange`（双工）+ `DoAction`（自定义动作）+ `GetSchema`。
- **Compute Kernel（`arrow::compute`）**：Scalar（cast/arithmetic/comparison）+ Vector（filter/take/sort_indices/unique/partition_nth/is_in/is_null/min_max/rank）+ Aggregate（count/sum/mean/min/max/stddev/quantile）+ Hash（hash_join/hash_aggregate/hash_sum/group_by）+ Match（matches_substring/regex）。
- **集成方式**：DataFusion（完全基于 Arrow RecordBatch）+ Velox（共享 Vector/Buffer）+ DuckDB（通过 C ABI 暴露 Arrow 数据）+ Polars（fork 自 arrow-rs）+ InfluxDB IOx / GreptimeDB / CeresDB（Arrow + Flight）+ 800+ 项目上下游（PyTorch / TensorFlow / Pandas / Spark / Snowflake / Databricks / Dremio / HuggingFace Datasets）。
- **关键路径**：`cpp/src/arrow/buffer.{h,cc}` + `cpp/src/arrow/array/array_base.h` + `cpp/src/arrow/record_batch.h` + `cpp/src/arrow/type.h` + `python/pyarrow/array.pxi`（pybind11 PyCapsule 实现）+ `cpp/src/arrow/ipc/{writer,reader}.cc`（FlatBuffers）+ `cpp/src/arrow/flight/{client,server}.cc` + `cpp/src/arrow/compute/kernels/*.cc` + `cpp/src/arrow/memory_pool.cc`（jemalloc/mimalloc）。

### 2.2 Apache DataFusion 41/42（Rust 原生 SQL 执行引擎 + Ballista 分布式）

详细：`docs/db-wiki/extension/datafusion.md`

- **定位**：ASF 顶级项目，「Rust 原生 + Arrow 共享内存 + SQL + DataFrame + 向量化执行 + Ballista 分布式 + Substrait IR + Python 绑定」的现代化 SQL 执行框架；API 客户端层 Rust API + Python API + HTTP API + Flight SQL + Substrait Producer + JDBC Bridge。
- **SQL 解析与 LogicalPlan**：基于 sqlparser-rs + AstBuilder → SqlToRel 转换器；LogicalPlan Rules（TypeCoercion + SimplifyExpressions + ScalarSubqueryToJoin + PredicatePushdown + FilterPushDownThroughJoin + AggregateReduceOutReferences + CSE）+ PhysicalPlan Rules（EnforceDistribution + EnforceSorting + OptimizeRepartition + BroadcastJoinRepartition + HashJoinOrder）+ Cost-based Optimizer（Statistics + Histograms + LimitPushDown）。
- **向量化执行引擎**：ExecutionPlan → 多 stream 上的 Operator pipeline + DataSourceExec + ProjectionExec + FilterExec + AggregateExec + HashJoinExec + SortMergeJoinExec + CrossJoinExec + CoalescePartitionsExec + RepartitionExec + SortExec + WindowAggExec + LimitExec + EmptyExec + ExplainExec + UserDefined (TableProvider / ExecutionPlan) + Stream Partitioning RoundRobin/Hash/Range。
- **TableProvider + UDF/UDAF/UDWF 自定义系统**：`TableProvider` trait（实现 ParquetTableProvider / CsvTableProvider / JsonTableProvider / MemoryTableProvider / ListingTableProvider + 用户自定义 KafkaTopicProvider / FlightProvider / LanceTableProvider）+ `register_udf()`/`register_udaf()`/`register_udwf()`（ScalarFunction + Accumulator + Expr）+ 异步 `scan` 返回 ExecutionPlan。
- **Substrait IR 互转**：DataFusion → Substrait（`try_into_substrait_proto` + `to_substrait_json`）+ Substrait → DataFusion（`SubstraitPlan::from_substrait_proto` + `from_substrait`）；支持不同厂商引擎（DataFusion / Velox / ClickHouse）互转计划。
- **Ballista 分布式查询**：Scheduler + Executors（K8s 调度），按 Stage 划分；本地 Disk Shuffle + 远程网络 shuffle；K8s Deployment auto scaling；Multi-Tenant 通过独立 SessionState。
- **Python DataFrame API**：`datafusion-python`（pyo3 + Cython）+ `df.sql()` + `df.collect()`；与 pandas / pyarrow 互通；`ctx.from_arrow(data)`。
- **关键路径**：`datafusion/core/src/dataframe.rs`（约 1500 行）+ `datafusion/core/src/sql.rs`（约 1000 行）+ `datafusion/core/src/execution/context.rs`（约 1500 行）+ `datafusion/expr/src/logical_plan/`（约 2000 行）+ `datafusion/core/src/physical_plan/execution_plan.rs` + `datafusion/core/src/physical_plan/filter.rs` + `aggregates/` + `joins/` + `datafusion/optimizer/src/` + `datafusion/core/src/datasource/` + `datafusion-sql/src/` + `datafusion/proto/src/` + `ballista/{scheduler,executor}/src/`（约 3000 行）。

### 2.3 Meta Velox 0.36/0.37（C++20 向量化统一执行 + Operator + Expression）

详细：`docs/db-wiki/extension/velox.md`

- **定位**：Meta 在 2020 年开源的「统一 C++ 向量化查询执行库」，为 Presto / Spark / Glow / Tectonic 提供统一的向量化、内存友好的执行引擎，避免重复开发；设计核心是 Operator + Expression 双抽象。
- **核心架构**：输入输出层（C++ API + JNI/FFI bindings + Presto Thrift Protocol + Gluten Java + Doris 内部）+ Operator 层（Filter / Project / TableScan / Values / HashBuild / HashProbe / MergeJoin / NestedLoopJoin / IndexLookup / HashAggregation / StreamingAggregation / Window / TopN / OrderBy / Limit / Unnest / RowNumber / Rank）+ Expression 层（Expr: FieldAccess / Call / Cast / SpecialForm / Lambda + ExprSet → CompiledExpression + SimpleFunction / VectorFunction / Aggregate Function + FunctionRegistry）。
- **Vector 与 Type 系统**：`BaseVector` / `FlatVector<T>` / `DictionaryVector<T>` / `ConstantVector<T>` / `LazyVector` / `ArrayVector` / `MapVector` / `RowVector`（vector of vector）+ Type 系统 scalar (Integer/Boolean/Varchar/Decimal) + complex (Array/Map/Row/Json) + temporal + special (IpAddress/Uuid/HyperLogLog/Digests/QDigest) + geometry；Velox Type 通过 `arrow::Type ↔ velox::Type` 转换。
- **Arrow 共享 + 互转**：`velox/arrow/` + `ArrowBridge::toVelox(arrow_array)` / `ArrowBridge::fromVelox(velox_vector)`，与 PyTorch / TensorFlow 桥接；`velox/dwio/parquet/` Parquet reader 共享 Arrow Vector。
- **MemoryPool 分层 + Spill**：root → query → task → operator 四级 MemoryPool；MemoryAllocator MappedMemory / GpuMemory / CpuMemory；AllocationListener 可监控；Spill-to-Disk（disk-spill / hash-spill / agg-spill）+ Spillable Hash Table 避免 OOM。
- **HashTable + Adaptive Hash Join**：F14 哈希表构建 + F14 增量查询；Adaptive 驱动 + 串行化 + memory threshold 后切 Streaming Hash Join；MergeJoin（已排序输入 O(N+M)）+ NestedLoopJoin（非等值）。
- **Connector framework**：Hive Connector（默认）+ Iceberg Connector（velox-iceberg）+ TPCDS Connector + cuDF（GPU 加速实验）+ cudf 算子 + 类 Presto / Doris / Gluten 全覆盖。
- **下游覆盖**：Presto C++ Worker（Prestissimo，核心）+ Apache Gluten（Spark Native 引擎）+ Apache Doris（0.15+ 完全基于 Velox）+ velox-iceberg + Iceberg（velox-iceberg Connector）；Meta 内部每天 1.5 亿次查询、6 EB 数据。
- **关键路径**：`velox/vector/BaseVector.h` + `velox/vector/FlatVector.h` + `velox/exec/Operator.h` + `velox/exec/Driver.h` + `velox/expression/Expr.h`（约 800 行）+ `velox/exec/{Filter,Project,HashBuild,HashProbe,HashAggregation,StreamingAggregation}.cpp` + `velox/dwio/parquet/Reader.cpp` + `velox/iceberg/Table.cpp` + `velox/common/memory/MemoryPool.cpp` + `velox/expression/FunctionRegistry.cpp` + `velox/connectors/hive/HiveConnector.cpp` + `velox/serializers/PrestoPage.cpp`。

---

## 3. 24 维度对照矩阵

> 等级：A=工业级，缺失≤1 个版本号差距 / B=教学+工程可用，关键能力缺失 / C=占位，仅 API / D=空。
> 本表覆盖自研 vs Arrow vs DataFusion vs Velox 四方对照。

| # | 维度 | 自研（book） | Arrow | DataFusion | Velox | 等级 | 关键说明 |
|---|------|-------------|-------|------------|-------|------|------|
| 1 | 项目定位 | C 端插件加载 + REST/gRPC 暴露 + 优化器 cost 插件化 + 分布式查询 RPC + TSO + Percolator | 跨语言列式内存格式标准 + IPC + Flight RPC + 800+ 上下游 | Rust 原生 SQL + Arrow + Ballista 分布式 + ASF 顶级 | C++20 向量化 + Operator + Expression + Arrow 共享 + LF AI Data | B | 自研 plugin + RPC 完整；缺内存标准 + SQL 执行 |
| 2 | 发展历史 | 单一维护者内部迭代 | 2015 起，10 年，季度发版 | 2018 起，8 年，月 commit 600+ | 2019 起，7 年，月 commit 500+ | C | 历史沉淀薄 |
| 3 | 许可限制 | 内部使用，无外部约束 | Apache 2.0（最宽松） | Apache 2.0（最宽松） | Apache 2.0（最宽松） | A | 自研无开源义务 |
| 4 | 使用方案例 | 内部测试 + 多模态 RAG demo 集成 | Dremio / Databricks / Snowflake / InfluxDB IOx / GreptimeDB / CeresDB / 800+ 项目 | InfluxDB IOx / GreptimeDB / Cloudflare R2 / LanceDB / Cloudflare Workers / Databricks Delta | Meta Presto-on-Velox / Doris / LinkedIn Pinot / Uber Hudi / Lyft Analytics / ByteHouse / Tencent CDL | C | 缺外部生产案例 |
| 5 | 对比定位 | 「插件动态加载 + REST/gRPC 暴露 + 优化器 cost 插件化 + 分布式查询」 | 「跨语言列式内存标准 + 多语言 SDK + 800+ 上下游」 | 「Rust 原生 + Arrow + 嵌入式 SQL + 分布式 + Substrait」 | 「C++ 向量化统一执行 + Operator + Expression + Arrow 共享」 | B | 自研缺内存标准 + SQL 引擎 + 向量化 |
| 6 | 整体架构 | 插件动态库 + REST/gRPC Server + 优化器 + 分布式查询 RPC + TSO + Percolator | 多语言 SDK + 列式内存（Array/RecordBatch/Table/Schema）+ Compute Kernel + IPC + Flight | SQL Parser + LogicalPlan + Optimizer + ExecutionPlan + TableProvider + UDF + Ballista | Operator + Expression + Vector + MemoryPool + Connector + Driver/Task | C | 自研 4 模块独立；缺统一列式内存 + Pipeline |
| 7 | **列式内存格式** | **无（基于 C 结构体 + JSON 序列化）** | **Array/RecordBatch/Table/Schema/Field/DataType + 每列独立 buffer（data/validity/offsets）+ 零拷贝 Slice** | **完全复用 Arrow RecordBatch（所有 operator 统一输入输出）** | **BaseVector / FlatVector / DictionaryVector / ConstantVector / RowVector，与 Arrow 通过 ArrowBridge 互转** | **D** | **自研无列式内存标准；缺 Array/RecordBatch/Vector** |
| 8 | **IPC / 序列化** | **JSON + Protobuf + 自管二进制** | **FlatBuffers + IPC Stream + zero-copy + LZ4/ZSTD/Snappy 压缩** | **Arrow IPC + Parquet + JSON + CSV** | **Presto Page + Spark Shuffle + Arrow Bridge** | **B-** | **自研 JSON+Protobuf，缺 IPC Stream + 零拷贝** |
| 9 | **跨语言 RPC** | **REST Server（cpp-httplib）+ gRPC Server（protobuf）+ 流式 rpc_stream** | **Arrow Flight（gRPC+FlatBuffers）+ DoGet 多 Endpoint 并行 + DoPut + DoExchange + DoAction** | **arrow-flight-sql（JDBC 桥接）+ Flight + Rust gRPC + tokio 异步** | **Presto Thrift（Prestissimo）+ Thrift Page + Gluten Java JNI + Doris 内部接口** | **B** | **自研有 gRPC，缺 Arrow Flight RPC + Flight SQL** |
| 10 | **Compute Kernel** | **无（自定义算子需在 C 端实现 + 通过 gRPC 暴露）** | **Scalar/Vector/Aggregate/Hash/Match Kernel 全集（cast/filter/take/sort/hash_join/aggregate/sort_indices/unique/partition_nth/is_in/is_null/min_max/rank）** | **复用 Arrow Compute + 自定义 UDF/UDAF/UDWF + 30+ builtin 函数** | **VectorFunction + SimpleFunction + Aggregate Function + Function Registry（presto_fn/spark_fn/sparksql_fn/hll_fn/tpcds_fn）+ CompiledExpression** | **D** | **自研无 Kernel 注册表；缺 Compute/Function Registry** |
| 11 | **TableProvider / 自定义扩展点** | **plugin_manager（动态库）+ ecosystem（REST/gRPC Service 注册）** | **N/A（Arrow 不是 DB；DataFusion/Velox 用其作为底层）** | **TableProvider trait + ExecutionPlan + UDF/UDAF/UDWF 注册表 + 100+ builtin 函数** | **Connector framework（hive/iceberg/tpcds/cudf）+ 用户自定义 Operator + Function Registry + Connector Factory** | **C** | **自研 plugin + Service 注册；缺 TableProvider + Connector + UDF 注册表** |
| 12 | **SQL / DSL 接口** | **分布式 SQL 协调（distributed_query.c 解析 → LogicalPlan → 多 shard）+ 优化器代价** | **无（不是 DB）；但 DataFusion 暴露 SQL API** | **SQLparser-rs + AstBuilder + SqlToRel + 100+ 内置函数 + CTE/Window/Lambda/Recursive CTE + DataFrame API** | **无（执行引擎）；SQL 由上游 Presto/Doris/Spark/Gluten 解析** | **C** | **自研分布式 SQL 协调有；缺 SQL 解析 + DataFrame API** |
| 13 | **优化器** | **optimizer.c + optimizer_cost.c（cost 模型）+ optimizer_parallel.c + OptimizerRule 插件（optimizer_register_rule）** | **N/A** | **Cascades/Volcano 风格 LogicalPlan Rules + PhysicalPlan Rules + Cost-based（Statistics + Histograms + Information Flow + Limit PushDown）** | **无（执行引擎）；优化由上游 Coordinator 负责** | **B** | **自研规则 + cost 模型齐；缺 CBO + Information Flow + 自适应** |
| 14 | **执行引擎** | **分布式查询 RPC（distributed_query）+ 流式 rpc_stream + 多 shard 协调；无统一执行引擎** | **无（不执行）；DataFusion/Velox 用其作为输入** | **ExecutionPlan + Operator pipeline + 多 stream + Backpressure + 1024-8192 行/批 + SIMD** | **Operator + Expression + Pipeline + Driver/Task + Adaptive Hash Join + Spill-to-Disk + MemoryPool 分层** | **C** | **自研分布式协调有；缺 ExecutionPlan + Pipeline + 向量化** |
| 15 | **Vector / Buffer 共享** | **无（基于结构体 + JSON 序列化）** | **Buffer/Vector/Array 跨语言共享（PyCapsule + C ABI）** | **完全共享 Arrow Buffer/Vector** | **共享 Velox Vector 与 Arrow Buffer/Vector（通过 ArrowBridge）** | **D** | **自研无 Vector/Buffer 概念** |
| 16 | **分布式调度** | **distributed_query（多 shard 协调）+ TSO + Percolator + 死锁检测 + rpc_stream** | **无（不是 DB）；DataFusion 用 Ballista** | **Ballista（Scheduler + Executors + K8s + Stage）+ 本地 Disk Shuffle + 远程网络 shuffle** | **无（执行引擎）；上游 Doris/Presto 负责调度** | **B** | **自研分布式 RPC + TSO 齐；缺 Ballista 风格 Stage 调度** |
| 17 | **Memory 管理** | **自管 Buffer Pool（bufmgr.c）+ 多模型复用** | **MemoryPool（jemalloc/mimalloc）+ 跨进程分配器** | **复用 Arrow MemoryPool + 线程安全** | **MemoryPool 分层（root/query/task/operator）+ MemoryAllocator（MappedMemory/GpuMemory/CpuMemory）+ AllocationListener + Spill-to-Disk** | **C** | **自研 BufferPool 有；缺 Spill + MemoryPool 分层** |
| 18 | **函数注册表** | **无（仅 plugin + Service 注册）** | **Compute Kernel 注册表（cast/filter/take/...）+ Plugin Extension** | **Builtin 100+ 函数 + UDF/UDAF/UDWF 注册** | **Function Registry（presto_fn / spark_fn / sparksql_fn / hll_fn / tpcds_fn）+ SimpleFunction + VectorFunction + AggregateFunction** | **D** | **自研无 Function Registry** |
| 19 | **持久化** | **底层页/缓冲池/WAL/Catalog 复用 + 分布式 Percolator 2PC** | **无（不持久化）；Parquet 持久化层** | **无（不持久化）；上游 TableProvider 提供（Parquet/CSV/JSON/Iceberg/Delta/Hudi）** | **无（不持久化）；上游 Connector 提供** | **B** | **自研内核持久化齐；缺 Iceberg/Delta 适配层** |
| 20 | **多语言 SDK** | **无（仅 REST/gRPC Server）** | **C++ / Python / Rust / Java / Go / JS / C# / R / Ruby（15+ 语言）** | **Rust + Python + Java + Go + C++（5+ 语言）** | **C++ + Java（通过 Gluten）+ Python（实验）+ Presto Thrift + Substrait** | **D** | **自研无 SDK；缺多语言客户端** |
| 21 | **公开 Bench 基准** | **内部 gtest 通过，缺 ClickBench / TPC-H** | **ann-benchmarks + 第三方 benchmark** | **TPC-H SF100 17s + ClickBench 30/43 + H2O.ai + Redshift Benchmark** | **TPC-H SF100 13-18s + ClickBench 30/43 + H2O.ai + Gluten + Presto C++ 5-10x** | **D** | **自研无公开 Bench** |
| 22 | **生态集成** | **REST/gRPC + 插件 + 多模态 RAG demo** | **PyTorch/TF/JAX/HuggingFace/Pandas/Polars/DuckDB/InfluxDB IOx/GreptimeDB/CeresDB + Iceberg/Delta Lake + Dremio + Databricks + Snowflake + Redshift Spectrum + HuggingFace Datasets** | **InluxDB IOx + GreptimeDB + Cloudflare R2 Data Catalog + HuggingFace DataFrame + LanceDB + sql-flow + Delta Lake Iceberg Hudi + BI Superset/Tableau/PowerBI + Kafka Redpanda + DataFusion-Kafka + GlueSQL + RisingWave** | **Presto on Velox + Gluten Spark + Doris + Iceberg + cudf + Hive + Glue + Presto C++ Worker + Tectonic + DWRF + Nimble + LinkedIn Pinot + Adobe AEP + Uber Hudi + Lyft Analytics + Tencent CDL** | **D** | **自研只有内部 RAG demo** |
| 23 | **核心论文** | **无独立发表** | Acero et al. 2024 Arrow 论文 + McKinney 2017 + Boncz 2005 MonetDB/X100 | Kersten 2015 Velox 老论文 + Selinger 1979 System R + Graefe 1995 Cascades + Petersohn 2021 Substrait + Acar 2018 Tokio | Pedreira 2022 Velox VLDB + Anneser 2023 VLDB Industrial + Boncz 2005 MonetDB/X100 + Ongaro 2014 Raft | A | 自研追踪全部论文但无独立发表 |
| 24 | **源码路径（对照）** | `engineering/src/db/ecosystem/{plugin_manager,rest_server,grpc_server}.c` + `engineering/include/db/ecosystem/*.h` + `engineering/src/db/optimizer/{optimizer,optimizer_cost,optimizer_parallel}.c` + `engineering/include/db/optimizer{,_cost}.h` + `engineering/src/db/distributed/query/distributed_query.c` + `engineering/include/db/distributed/{distributed_query,rpc,rpc_stream,tso,percolator,deadlock,mvcc_ts}.h` + `engineering/src/db/distributed/rpc/rpc_stream.c` | `cpp/src/arrow/{buffer,array,record_batch,type,memory_pool}.{h,cc}` + `python/pyarrow/array.pxi` + `cpp/src/arrow/ipc/{writer,reader}.cc` + `cpp/src/arrow/flight/{client,server}.cc` + `cpp/src/arrow/compute/kernels/*.cc` + `rust/arrow/src/array.rs` + `rust/datafusion/core/src/` | `datafusion/core/src/{dataframe,sql,execution/context}.rs` + `datafusion/expr/src/logical_plan/` + `datafusion/core/src/physical_plan/{execution_plan,filter,projection,sort}.rs` + `datafusion/optimizer/src/` + `datafusion/core/src/datasource/` + `datafusion-sql/src/` + `datafusion/proto/src/` + `ballista/{scheduler,executor}/src/` | `velox/vector/{BaseVector,FlatVector}.h` + `velox/exec/{Operator,Driver}.h` + `velox/expression/Expr.h`（约 800 行）+ `velox/exec/{Filter,Project,HashBuild,HashProbe,HashAggregation,StreamingAggregation}.cpp` + `velox/dwio/parquet/Reader.cpp` + `velox/iceberg/Table.cpp` + `velox/common/memory/MemoryPool.cpp` + `velox/expression/FunctionRegistry.cpp` + `velox/connectors/hive/HiveConnector.cpp` | A | 路径分层清晰 |
| 25 | 与本项目关联 | 即本项目，需明确插件扩展定位 | 「列式内存标准 + 跨语言 SDK」 自研可作为底层嵌入 | 「Rust SQL 引擎 + TableProvider + UDF + 分布式」 嵌入式 SQL 路径原型 | 「C++ 向量化统一执行 + Operator + Connector」 大型并行执行路径原型 | A | 路径一一对应，可对照 wiki 学习 |

> 注：上表实际为 25 行（含「与本项目关联」一行扩展），24 维度主表保持不变。

**矩阵读法**：

- **等级 A**：维度 3 / 23 / 24 / 25（共 4 项）
- **等级 B**：维度 1 / 5 / 8 / 9 / 13 / 16 / 19（共 7 项）
- **等级 C**：维度 2 / 4 / 6 / 11 / 12 / 14 / 17（共 7 项）
- **等级 D**：维度 7 / 10 / 15 / 18 / 20 / 21 / 22（共 7 项）

**整体评级：B-** —— 方向正确且自研 plugin + REST/gRPC + 优化器 cost 插件化 + 分布式查询 RPC + TSO + Percolator 框架齐备，但**无**Apache Arrow 列式内存格式（Array/RecordBatch/Table/Schema）+ IPC Stream + Arrow Flight RPC + Compute Kernel 全集 + DataFusion TableProvider + UDF/UDAF/UDWF 注册表 + Velox Operator + Expression + MemoryPool 分层 + Spill + 多语言 SDK + Iceberg/Delta 适配层 + 公开 Bench 七块 D 级补丁 + 维度 11（TableProvider 完整 + UDF）+ 14（统一执行引擎）+ 17（MemoryPool Spill）三块 C 级补丁；建议下月把 P0 集中在维度 7 / 10 / 11 / 14 / 17 / 18 这六个等级 C/D 的联动（**P0 必含「引入 Apache Arrow 作为列式内存 + IPC + Flight 底座」**——见 §7）。

---

## 4. 关键差距 Top-5

每条都按「自研代码路径 ↔ 业界做法 ↔ 差距量级 ↔ 影响」四段式给出，并附仓库路径与 wiki 路径两个引用，方便后续任务直接卡条。

### 4.1 Apache Arrow 列式内存格式（Array/RecordBatch/Table/Schema）+ IPC Stream + Arrow Flight RPC + Compute Kernel 四件套全链路空白（等级 D → A）

- **自研现状**：`engineering/src/db/ecosystem/rest_server.c` + `grpc_server.c` 通过 JSON + Protobuf 暴露 REST/gRPC 接口；`engineering/src/db/distributed/rpc/rpc_stream.c`（约 320 行）实现双向流；但**无** Apache Arrow `Array/RecordBatch/Table/Schema/Field/DataType` 列式内存格式、**无** IPC Stream + FlatBuffers 序列化、**无** Arrow Flight RPC（gRPC + FlatBuffers 的微服务级数据传输协议，DoGet 多 Endpoint 并行 + DoPut + DoExchange + DoAction）、**无** Arrow Compute Kernel（cast / filter / take / sort / hash_join / aggregate / hash_aggregate / sort_indices / unique / partition_nth / is_in / is_null / min_max / rank）、**无** PyCapsule 跨语言零拷贝（Python ↔ C++）、**无** Buffer / MemoryPool 跨进程分配器、**无** Parquet 持久化列存 + Arrow 互转。
- **业界做法**：Arrow `cpp/src/arrow/buffer.{h,cc}`（Buffer 抽象）+ `cpp/src/arrow/array/array_base.h`（Array 基类 + Int32Array + Utf8Array + StructArray）+ `cpp/src/arrow/record_batch.h`（多列组合）+ `cpp/src/arrow/type.h`（DataType + Field + Schema）+ `python/pyarrow/array.pxi`（PyCapsule 实现） + `cpp/src/arrow/ipc/{writer,reader}.cc`（FlatBuffers 流式）+ `cpp/src/arrow/flight/{client,server}.cc` + `cpp/src/arrow/compute/kernels/*.cc`；DataFusion `datafusion/core/src/datasource/` 完全复用 Arrow RecordBatch（所有 operator 输入输出统一）；Velox `velox/arrow/` + `ArrowBridge::toVelox(arrow_array)` / `fromVelox(velox_vector)`。
- **差距量级**：约 8-12 个文件 / 10000-18000 行 C；包含 Arrow C++ 集成（`arrow_array.{h,c}` + `arrow_schema.{h,c}` + `arrow_table.{h,c}` + `arrow_buffer.{h,c}` + `arrow_mempool.{h,c}`）+ IPC Stream 适配（`arrow_ipc.{h,c}` + FlatBuffers 消息 + LZ4/ZSTD 压缩）+ Arrow Flight Server（`arrow_flight_server.{h,c}` + DoGet/DoPut/DoExchange/DoAction + 多 Endpoint 并行）+ Compute Kernel 集成（`arrow_compute.{h,c}` + cast/filter/take/sort/hash_join/aggregate）+ 零拷贝跨语言（`arrow_export_array.{h,c}` + `arrow_import_array.{h,c}` + PyCapsule 实现）。
- **影响**：缺列式内存标准 = Python 客户端需自管序列化（成本高 5-10x）；与 800+ Arrow 上下游项目不可对接（DataFusion / Velox / Polars / DuckDB / InfluxDB IOx 等）；无 Flight RPC = 大数据流式传输单流 800 MB/s（vs 多 Endpoint 并行 8-9 GB/s）；与 DataFusion / Velox 等扩展点对接需要重新实现 RecordBatch 转换层。

### 4.2 DataFusion TableProvider + UDF/UDAF/UDWF 注册表 + LogicalPlan/PhysicalPlan + Substrait IR 全链路空白（等级 C → A）

- **自研现状**：`engineering/src/db/optimizer/optimizer.c` + `optimizer_cost.c`（约 250 行 cost 估算）+ `optimizer_parallel.c`（约 360 行并行规则）+ `optimizer_register_rule` 自定义优化器规则接口，但**无** DataFusion `SessionContext` + `TableProvider` trait + `LogicalPlan/PhysicalPlan` 二阶段、**无** sqlparser-rs（仅 `engineering/src/db/parser/CMakeLists.txt` 自研 SQL parser）、**无** DataFusion UDF/UDAF/UDWF 注册表（`register_udf` + `register_udaf` + `register_udwf` + ScalarFunction + Accumulator 实现）、**无** 100+ 内置函数（数学/字符串/时间/数组/map/struct/lambda）、**无** substrait IR 跨引擎互转（仅 Protobuf）、**无** DataFrame API（Python `ctx.sql()` + Rust `DataFrame`）、**无** Cbo Statistics + Histograms + Information Flow。
- **业界做法**：DataFusion `datafusion/core/src/dataframe.rs`（约 1500 行 DataFrame API）+ `datafusion/core/src/sql.rs`（SqlToRel 转换器）+ `datafusion/core/src/execution/context.rs`（SessionContext + SessionState）+ `datafusion/expr/src/logical_plan/`（LogicalPlan + Expr 定义）+ `datafusion/core/src/physical_plan/execution_plan.rs`（ExecutionPlan trait）+ `datafusion/core/src/datasource/`（TableProvider trait + MemoryTableProvider + ParquetTableProvider + ListingTableProvider）+ `datafusion/proto/src/`（Substrait 序列化） + `datafusion-physical-expr/src/`（PhysicalExpr + ScalarFunctionExpr，约 4000 行）+ `datafusion/functions-aggregate/`（Aggregate，约 5000 行）+ `datafusion-optimizer/src/`（rules + physical）。
- **差距量级**：约 10-15 个文件 / 12000-20000 行 C；包含 TableProvider 适配器（`table_provider.{h,c}` + 关系表、KV 表、向量表接入）+ SessionContext（`session_context.{h,c}` + session state + DataFrame API）+ UDF 注册表（`udf_registry.{h,c}` + 自定义函数）+ 物理计划（`physical_plan.{h,c}` + ExecutionPlan trait + 30+ 内置算子）+ substrait IR（`substrait.{h,c}` + proto 序列化 + 互转）。
- **影响**：自研 SQL 协调层 `distributed_query.c` 缺少现代化 TableProvider / UDF / Optimization 一体化接口；与 InfluxDB IOx / GreptimeDB / LanceDB 等 DataFusion 下游不可对接；Python 用户无法用 `df.sql()` 直接调用本数据库；自定义 UDF 需在 C 端实现 + 通过 gRPC 暴露（vs DataFusion `register_udf()` 一行）。

### 4.3 Velox Operator + Expression 双抽象 + MemoryPool 分层 + Spill-to-Disk + Connector framework 全链路空白（等级 D → A）

- **自研现状**：`engineering/src/db/storage/buffer/bufmgr.c`（BufferPool）+ `engineering/src/db/distributed/query/distributed_query.c`（distributed Query 协调）+ 多模型存储算子，但**无** Velox Operator + Expression 双抽象（Operator 是高层算子，Expression 是底层标量/复杂表达式）、**无** `Pipeline / TaskQueue / Consumer / Producer` 模型、**无** `FlatVector` / `DictionaryVector` / `ConstantVector` / `RowVector` 数据抽象、**无** MemoryPool 分层（root / query / task / operator 四级）、**无** Spill-to-Disk（disk-spill + hash-spill + agg-spill）、**无** Adaptive Hash Join（自适应驱动 + 串行化 + 阈值切 Streaming Hash Join）、**无** Function Registry（presto_fn / spark_fn / sparksql_fn / hll_fn / tpcds_fn）、**无** Connector framework（hive + iceberg + tpcds + cudf）+ Connector Factory、**无** Driver/Task Pipeline 异步调度。
- **业界做法**：Velox `velox/vector/{BaseVector,FlatVector,DictionaryVector,ConstantVector}.h` + `velox/exec/Operator.h`（Operator 基类 + getOutput 多态）+ `velox/exec/Driver.h`（Task 执行模型 + Pipeline + Consumer + Producer）+ `velox/expression/Expr.h`（Expr AST + ExprSet::eval）+ `velox/exec/{Filter,Project,HashBuild,HashProbe,HashAggregation,StreamingAggregation}.cpp` + `velox/dwio/parquet/Reader.cpp` + `velox/iceberg/Table.cpp` + `velox/common/memory/MemoryPool.cpp`（root/query/task/operator 四级）+ `velox/expression/FunctionRegistry.cpp`（presto_fn / spark_fn / hll_fn / tpcds_fn）+ `velox/connectors/hive/HiveConnector.cpp`。
- **差距量级**：约 10-18 个文件 / 15000-25000 行 C；包含 Vector 与 Type 系统（`base_vector.{h,c}` + FlatVector/DictionaryVector/ConstantVector/LazyVector/RowVector/ArrayVector/MapVector/StructVector）+ Operator 抽象（`operator.{h,c}` + TableScan/Filter/Project/HashBuild/HashProbe/MergeJoin/NestedLoopJoin/HashAggregation/Window/TopN/OrderBy/Limit/Rank 等 15+）+ Expression framework（`expression.{h,c}` + Expr AST + Function Registry + CompiledExpression + SimpleFunction/VectorFunction/Aggregate Function）+ MemoryPool 分层（`memory_pool.{h,c}` + Spill-to-Disk + Spillable Hash Table）+ Connector framework（`connector.{h,c}` + Hive/Iceberg/TPCDS Connector + 用户自定义）+ Driver/Task Pipeline（`driver.{h,c}` + Task 生命周期 + Pipeline 调度 + 异步 Future）。
- **影响**：缺 Operator + Expression 双抽象 = 自研执行逻辑散落在 optimizer.c + distributed_query.c + 多模型 executor.c 中，无法独立优化；缺 Spill-to-Disk = 大查询 OOM 不可避免；缺 Function Registry = 自定义函数需硬编码到 optimizer.c 中，无法插件化；与 Presto on Velox / Gluten / Doris 全覆盖不可比。

### 4.4 多语言 SDK（C/C++ + Python + Rust + Java + Go）+ Flight SQL 协议 + Iceberg/Delta Lake 适配层 三件套全链路空白（等级 D → A）

- **自研现状**：`engineering/src/db/ecosystem/rest_server.c`（REST 接口 + JSON）+ `engineering/src/db/ecosystem/grpc_server.c`（gRPC + Protobuf）；**无** Python 绑定（无 pybind11）、**无** Rust 绑定（无 bindgen）、**无** Java 绑定（无 JNI）、**无** Go 绑定（无 cgo）、**无** Node.js 绑定（无 N-API）、**无** ODBC / JDBC 驱动、**无** Flight SQL 协议（JDBC 桥接 + Superset/Tableau/PowerBI 接入）、**无** Iceberg/Delta/Hudi 适配层、**无** ORM（Drizzle / SQLAlchemy / Hibernate）、**无** BI（Metabase / Preset / Hex）。
- **业界做法**：Arrow C++ / Python `pip install pyarrow` / Rust `arrow-rs` / Java `org.apache.arrow:arrow-vector` / Go `github.com/apache/arrow/go/v17` / JS `apache-arrow` / C# `Apache.Arrow` / Ruby `red-arrow`（10+ 语言）；DataFusion `datafusion-python`（pyo3 + Cython）+ DataFrame API + Oracle/Excel/PowerBI/Tableau 桥接；Velox 通过 Gluten Java + Presto Worker + Doris + Substrait 提供；Dremio JDBC + ODBC 桥接 Arrow Flight + Iceberg/Delta REST Catalog。
- **差距量级**：约 8-12 个文件 / 10000-20000 行 C/C++ + 多语言胶水代码；包含 Python 绑定（pybind11 + `setup.py` + `mm/__init__.py`）+ Rust crate（bindgen + `lib.rs`）+ Java 绑定（JNI + `com.book.ext` 包）+ Go cgo（`mm.go`）+ Node.js（N-API + `binding.cc`）+ ODBC / JDBC 驱动（`engineering/sdk/odbc/` + `engineering/sdk/jdbc/`）+ Flight SQL Server（`engineering/apps/flight_sql_server/`）+ Iceberg/Delta 适配（`engineering/src/db/storage/iceberg/` + `engineering/src/db/storage/delta/`）。
- **影响**：外部应用集成门槛极高（只能用 C / gRPC / REST 调用）；无 Python / Rust / Java 生态集成（无法直接喂给 LangChain / Haystack / LlamaIndex / HuggingFace Datasets）；无 BI / Notebook 集成（无法做数据科学分析）；无 Flight SQL = 无法与 BI 工具对接（Superset / Tableau / PowerBI）；与 Arrow / DataFusion / Velox 上下游生态完全脱钩。

### 4.5 公开 Bench（ClickBench 30/43 + TPC-H SF100 + H2O.ai）+ Cloud Native 部署（K8s）+ Serverless（Cloudflare Workers 风格）+ Function Registry 全链路空白（等级 D → A）

- **自研现状**：`engineering/src/db/ecosystem/` + `optimizer/` + `distributed/query/` + `plugin_manager` 提供基础扩展机制；**无** ClickBench 30/43 公开基准、**无** TPC-H SF100 公开基准、**无** H2O.ai DB benchmark、**无** Velox vs DataFusion vs DuckDB head-to-head 对比、**无** async-runtime（tokio / Folly coroutine）、**无** sharded service（thread-per-core + CPU 亲和）、**无** K8s Operator 部署（Strimzi / Doris Operator / Redpanda Operator）、**无** Serverless 部署（Cloudflare Workers Analytics Engine 风格）、**无** Function Registry（presto_fn / spark_fn / sparksql_fn / hll_fn / tpcds_fn）、**无** Adaptive Hash Join 切换、**无** Hash Spill 调度、**无** Memory Spill Trigger 时机、**无** GPU 算子（velox/cudf 实验）。
- **业界做法**：DataFusion TPC-H SF100 17s + ClickBench 30/43 + H2O.ai 公开基准 + async tokio runtime + 30+ builtin 函数；Velox TPC-H SF100 13-18s + ClickBench 30/43 + H2O.ai + Gluten + Presto C++ 5-10x + LF AI Data 项目 + Macro 季度发布 + 自定义 Connector + 自定义 Operator + Function Registry + Adaptive Hash Join + Hash Spill + Memory Spill Trigger + GPU velox/cudf 实验；Redpanda thread-per-core + io_uring（Linux 5.10+）+ Seastar reactor + K8s Redpanda Operator；Dremio Cloud + Voltron Data 商业化。
- **差距量级**：约 6-10 个文件 / 6000-12000 行 C + bench 自动化；包含 Bench Harness（`engineering/bench/clickbench/` + `engineering/bench/tpch/` + `engineering/bench/h2o/` + 公开结果到 `docs/bench/ext-2026-11.md`）+ Async Runtime（`engineering/src/db/core/async_runtime.{h,c}` + tokio 简化版）+ K8s Operator（`engineering/k8s/operator/` + CRD + controller）+ Serverless（`engineering/apps/serverless/` + Cloudflare Workers 风格）+ Function Registry（`engineering/src/db/extension/func_registry.{h,c}` + 100+ builtin + 自定义）+ Adaptive + Spill 调度（`engineering/src/db/executor/adaptive.{h,c}` + spill config）+ GPU `engineering/src/db/executor/cudf.{h,c}` 实验。
- **影响**：性能无法量化（缺公开基准对比）；无法 benchmark TPC-H / ClickBench / H2O.ai 等 OLAP 工业事实基准；与 Dremio / Voltron Data 商业服务器差距大；无法 K8s 自适应扩缩容；无法 Serverless 化部署到边缘计算场景；GPU 算子空白 = 自研 GPU 算子无 Velox 风格的高性能算子层基座。

---

## 5. 优势 Top-3（自研独有的设计）

### 5.1 插件动态加载（plugin_manager.c + LoadLibrary/GetProcAddress + plugin_init/plugin_exit）

`engineering/src/db/ecosystem/plugin_manager.c`（约 320 行）实现 **统一的动态库加载器**（Windows `LoadLibraryW` + `GetProcAddress`，Linux/macOS `dlopen` + `dlsym`） + plugin_load / plugin_unload / plugin_lookup / plugin_get_error / plugin_init / plugin_exit 完整生命周期 + 跨平台统一抽象。Arrow（无 plugin 加载抽象，仅 C++ SDK 静态链接）/ DataFusion（Rust crate 静态编译 + 编译时 Trait 实现，无运行时动态加载）/ Velox（同样编译时链接，无运行时插件）都不直接提供「动态库加载 + 函数符号查找 + 跨平台接口」插件机制；自研 plugin_manager 为「第三方算法/算子以动态库形式挂载」提供端到端范式，是 Arrow / DataFusion / Velox 都没有的差异化亮点。

### 5.2 优化器代价模型插件化（optimizer_cost.c + optimizer_register_rule + 并行规则 optimizer_parallel.c）

`engineering/src/db/optimizer/optimizer.c` + `optimizer_cost.c`（约 250 行 cost 估算）+ `optimizer_parallel.c`（约 360 行并行规则）+ `optimizer_register_rule` 自定义优化器规则接口形成「规则 + cost 模型 + 并行优化」三件套。`optimizer_cost_estimate_t`（cost 估算接口）+ `optimizer_cost_register_hook`（cost 模型注册）+ 并行规则（ParallelScanRule + ParallelHashJoinRule + ParallelAggregateRule）。Arrow（无优化器）/ DataFusion（logical + physical rules + cost-based，但插件化接口需 Trait 派生）/ Velox（无优化器）都不把「优化器 cost 模型 + 自定义规则 + 并行规则」作为一等公民的运行时插件；自研把优化器的扩展点作为 C API 暴露（`optimizer_register_rule` + `optimizer_register_cost_hook`），是 Arrow / DataFusion / Velox 都没有的差异化亮点。

### 5.3 分布式查询协调（distributed_query.c + TSO + Percolator + 死锁检测 + rpc_stream）端到端

`engineering/src/db/distributed/query/distributed_query.c`（约 380 行）实现 **分布式 SQL 协调**（解析 SQL → LogicalPlan → 物理切分 → 多 shard 路由 → 合并结果）+ `engineering/src/db/distributed/rpc/rpc_stream.c`（约 320 行）流式管道 + `engineering/include/db/distributed/tso.h`（TSO 全局单调时间戳）+ `engineering/include/db/distributed/percolator.h`（Percolator 2PC）+ `engineering/include/db/distributed/deadlock.h`（WFG 图 + 周期检测）+ `engineering/include/db/distributed/mvcc_ts.h`（MVCC 时间戳）形成「分布式查询 + RPC + TSO + 2PC + 死锁 + MVCC」六件套。Arrow（无分布式调度）/ DataFusion（Ballista 分布式在独立 crate，需 K8s）+ Velox（无调度，由上游 Coordinator 负责）的「分布式协调 + TSO + Percolator + 死锁 + MVCC」是端到端内嵌实现，且与自研 `engineering/src/db/storage/rel/` + `engineering/src/db/optimizer/` 深度耦合；自研把分布式事务一致性作为 C API 一等公民暴露，是 Arrow / DataFusion 都没有的差异化亮点。

---

## 6. 学习路径

> 推荐精读以下 wiki 段落 + 一段自研源码，每条都给「为什么读它」。

### 6.1 必须读（一周内）

1. **[`docs/db-wiki/extension/arrow.md`](../db-wiki/extension/arrow.md) §六（整体架构：多语言 API + 核心数据模型层 + Compute Kernel + IPC/Flight）+ §八（列式内存格式：每列独立 buffer + 零拷贝 Slice + 类型系统）+ §九（Compute Kernel + Arrow Flight RPC 详解）**
   - 原因：补齐 Top-5 §4.1（Apache Arrow 列式内存 + IPC + Flight + Compute Kernel）所需的核心背景；Arrow `cpp/src/arrow/{buffer,array,record_batch,type}.{h,cc}`（列式内存基础）+ `python/pyarrow/array.pxi`（PyCapsule 实现）+ `cpp/src/arrow/ipc/{writer,reader}.cc`（IPC Stream + FlatBuffers）+ `cpp/src/arrow/flight/{client,server}.cc`（Flight RPC）+ `cpp/src/arrow/compute/kernels/*.cc`（Compute Kernel 全集）是「跨语言列式内存 + 跨语言零拷贝」最权威参考。

2. **[`docs/db-wiki/extension/datafusion.md`](../db-wiki/extension/datafusion.md) §六（整体架构：API 客户端 + SQL 解析 + Optimizer + Execution Engine + Storage Adapter）+ §九.3（自定义 UDF/UDAF/UDWF + TableProvider）+ §九.5（Substrait IR 互转 + 向量化执行）+ §九.7（客户端 SDK）**
   - 原因：补齐 Top-5 §4.2（DataFusion TableProvider + UDF + LogicalPlan/PhysicalPlan + Substrait）所需的设计原型；DataFusion `datafusion/core/src/dataframe.rs`（DataFrame API + LogicalPlan）+ `datafusion/core/src/sql.rs`（SqlToRel）+ `datafusion/core/src/physical_plan/execution_plan.rs`（ExecutionPlan trait）+ `datafusion/core/src/datasource/`（TableProvider trait）+ `datafusion/proto/src/`（Substrait）是「Rust 原生 SQL + 嵌入式 + 分布式」最易学习的源码。

3. **[`docs/db-wiki/extension/velox.md`](../db-wiki/extension/velox.md) §六（Operator + Expression 双抽象）+ §八（Vector + Operator 向量化执行 + Expression Framework + Adaptive Join + Spill）+ §七（Velox 与 Arrow 集成 + Gluten + Presto + Doris 集成）**
   - 原因：补齐 Top-5 §4.3（Velox Operator + Expression + MemoryPool + Spill + Connector）所需的所有背景图；Velox `velox/vector/BaseVector.h`（Vector 抽象）+ `velox/exec/Operator.h`（Operator 基类）+ `velox/exec/Driver.h`（Task 执行模型）+ `velox/expression/Expr.h`（Expression AST）+ `velox/common/memory/MemoryPool.cpp`（root/query/task/operator 四级）+ `velox/expression/FunctionRegistry.cpp`（presto_fn/spark_fn/hll_fn/tpcds_fn）是「C++ 向量化统一执行」最清晰的实现。

### 6.2 推荐读（一月内）

4. **[`docs/db-wiki/extension/arrow.md`](../db-wiki/extension/arrow.md) §七（嵌入式 vs 服务端模式 + 与 PG/DuckDB/DataFusion/Velox/HF/Polars 集成）+ §八.3（字典编码与压缩 RLE/Bit-packing/Delta + ZSTD/LZ4/Snappy IPC 压缩）+ §八.4（跨语言 ABI 与零拷贝 C ABI + PyCapsule + 共享内存 IPC）**
   - 原因：补齐 Top-5 §4.1（IPC 压缩 + 跨语言零拷贝）所需的实现细节；Arrow `cpp/src/arrow/ipc/{writer,reader}.cc` + `python/pyarrow/array.pxi`（PyCapsule）+ Arrow 跨语言 zero-copy 是「跨语言列式内存」最易学习的实现。

5. **[`docs/db-wiki/extension/datafusion.md`](../db-wiki/extension/datafusion.md) §八（Statistics + 文件级别索引 + Parquet column index/bloom filter/page index + Iceberg hidden partition + Delta data skipping + Listing Table Partitioning）+ §九.6（向量化执行 + SIMD 加速 + ahash + xxhash + Small Sort + LsdRadixSort）**
   - 原因：补齐 Top-5 §4.2（CBO Statistics + Histograms + 向量化执行 SIMD）的实现细节；DataFusion `datafusion/core/src/physical_plan/filter.rs` + `projection.rs` + `sort.rs` + `aggregates/` + `joins/` + `optimizer/src/` 是「Rust 原生向量化 SQL」端到端范本。

6. **[`docs/db-wiki/extension/velox.md`](../db-wiki/extension/velox.md) §六.4（向量化数据层 + Type 系统 + VectorEncoder/VectorDecoder/VectorHasher）+ §八.4（HashTable + Adaptive Hash Join + MergeJoin + NestedLoopJoin）+ §九（Driver/Task 模型 + Pipeline 与 LocalExchange + Operator 与 Function 详解）+ §十四（运维可观测性 Operator-level stats + Spill 监控）**
   - 原因：补齐 Top-5 §4.3（Operator + MemoryPool + Spill + Connector + Arrow Bridge）的设计原型；Velox Operator-level stats（exec::OperatorStats 暴露每 Operator 的 runtime/inputRows/outputRows/memoryBytes）+ `exec::trace::TaskTrace`（每阶段 Operator 耗时细分）+ SpillStats（spilled rows/bytes）+ Backpressure + Adaptive Hash Join 切换是「C++ 向量化统一执行」端到端范本。

### 6.3 对照实验

- 自研 `engineering/src/db/ecosystem/rest_server.c` ↔ Arrow Flight Server `cpp/src/arrow/flight/server.cc`：自研 REST Server 基于 cpp-httplib + JSON，单流 Fetch 限速；Arrow Flight Server 基于 gRPC + FlatBuffers，支持多 Endpoint 并行（10x 吞吐）。
- 自研 `engineering/src/db/optimizer/optimizer.c` ↔ DataFusion `datafusion/optimizer/src/` + Cascades 风格 rules：自研 optimizer_register_rule 接口与 DataFusion `OptimizerRule` Trait 都暴露规则注册入口，但 DataFusion 还有 Cost-based Optimizer（CBO）+ Statistics + Histograms + Information Flow，自研仅 cost 估算无 CBO。
- 自研 `engineering/src/db/distributed/query/distributed_query.c` ↔ Ballista `ballista/scheduler/src/`（约 3000 行）：自研分布式查询协调与 Ballista Stage 划分都解决「多节点并行执行」问题，但 Ballista 是 K8s 原生 + Stage 间 shuffle + reposTOLIO + active-active scheduler HA；自研依赖 RPC Stream + 节点数限制。
- 自研 `engineering/src/db/distributed/rpc/rpc_stream.c` ↔ Velox `velox/serializers/PrestoPage.cpp` + Thrift：自研基于 gRPC 双向流 + Protobuf 序列化；Velox 基于 Thrift Page + 与 Presto 协议互通，二进制 format 不同但都解决「分布式流式传输」问题。

---

## 7. 补齐项下月计划

> 每条按「动作 / 投入 / 学习资源（wiki 链接）/ 验收标准 / 优先级」给出。
> **自研缺失维度必须 P0 写「引入 Apache Arrow 作为列式内存 + IPC + Flight 底座」明确动作**；本节给出 5 条（P0 三条 + P1 两条）。

### 7.1 P0 — 启动 Apache Arrow 引入（列式内存 Array/RecordBatch + IPC Stream + Arrow Flight Server + Compute Kernel）（约 7 周）

- **动作**：
  1. **Arrow C++ 引入 + 列式内存**：在 `engineering/third_part/` 引入 `arrow-cpp`（静态库 `libarrow.a` + `libarrow_flight.a`），通过 `find_package(Arrow REQUIRED)` 在 `engineering/src/db/ecosystem/CMakeLists.txt` 集成；在 `engineering/include/db/` 下新建 `arrow_array.h` + `arrow_schema.h` + `arrow_table.h` + `arrow_buffer.h` + `arrow_mempool.h`（Arrow 类型包装层）；新建 `engineering/src/db/ecosystem/arrow_array.c` + `arrow_schema.c` + `arrow_table.c` + `arrow_buffer.c` + `arrow_mempool.c`。
  2. **IPC Stream 适配**：新建 `engineering/src/db/ecosystem/arrow_ipc.c`（FlatBuffers 消息读写 + LZ4/ZSTD 压缩 + Stream 流式序列化）；新建 `engineering/src/db/ecosystem/arrow_export.c` + `arrow_import.c`（C ABI 跨语言零拷贝）。
  3. **Arrow Flight Server**：新建 `engineering/src/db/ecosystem/arrow_flight_server.c`（实现 DoGet/DoPut/DoExchange/DoAction + 多 Endpoint 并行 + TLS）；新建 `engineering/src/db/ecosystem/arrow_flight_client.c`（Flight 客户端 SDK）。
  4. **Compute Kernel 集成**：新建 `engineering/src/db/ecosystem/arrow_compute.c`（集成 cast/filter/take/sort/hash_join/aggregate Kernel）+ `engineering/src/db/ecosystem/arrow_compute_expr.c`（与优化器集成）+ 自定义 UDF 适配（`register_arrow_function`）。
- **投入**：约 10000-18000 行 C（最大块），1.5 人 5 周开发 + 2 周测试。
- **学习资源**：[arrow.md §六](../db-wiki/extension/arrow.md)（整体架构）+ [arrow.md §八](../db-wiki/extension/arrow.md)（列式内存格式 + 类型系统 + 字典编码 + 跨语言 ABI）+ [arrow.md §九](../db-wiki/extension/arrow.md)（Compute Kernel + Arrow Flight RPC）+ [arrow.md §七](../db-wiki/extension/arrow.md)（与 DuckDB/DataFusion/Velox/Polars 集成）。
- **验收标准**：
  - `engineering/test/db/ecosystem/arrow_array_test.cpp` ≥ 8 用例（Array + Schema + RecordBatch + Buffer + Slice 零拷贝）通过；
  - `engineering/test/db/ecosystem/arrow_ipc_test.cpp` ≥ 6 用例（FlatBuffers + LZ4/ZSTD + Stream）通过；
  - `engineering/test/db/ecosystem/arrow_flight_server_test.cpp` ≥ 8 用例（DoGet 多 Endpoint + DoPut + DoExchange + DoAction + TLS）通过；
  - `engineering/test/db/ecosystem/arrow_compute_test.cpp` ≥ 12 用例（cast/filter/take/sort/hash_join/aggregate/sort_indices）通过；
  - `engineering/test/db/ecosystem/arrow_export_test.cpp` ≥ 6 用例（C ABI + Python PyCapsule 集成）通过；
  - `engineering/src/db/ecosystem/CMakeLists.txt` 通配新 .c 文件加入 `ecosystem_lib` 静态库。
- **优先级**：**P0**（决定 §4.1 与 Arrow 17/18 跨语言列式内存 + IPC + Flight + Compute Kernel 全方位对标 + 扩展机制从「插件加载」升级为「列式内存标准 + 跨语言 SDK + 向量化执行」）。

### 7.2 P0 — 启动 DataFusion TableProvider 集成 + UDF 注册表 + LogicalPlan/PhysicalPlan 二阶段（约 5 周）

- **动作**：
  1. **TableProvider 适配**：在 `engineering/src/db/ecosystem/` 下新建 `table_provider.{h,c}`（DataFusion TableProvider trait 适配器），将 `engineering/src/db/storage/` 中 relation / KV / Vector / Columnar 表接入；新建 `catalog_adapter.{h,c}`（Catalog 系统表适配）。
  2. **SessionContext + DataFrame API**：新建 `engineering/src/db/ecosystem/session_context.{h,c}`（DataFusion SessionContext 封装 + SessionState 隔离）；新建 `engineering/include/db/dataframe.h`（DataFrame API C 端 + col() / filter() / select() / sort() / limit() / collect()）。
  3. **UDF 注册表**：新建 `engineering/src/db/ecosystem/udf_registry.{h,c}`（注册表 + ScalarFunction + Accumulator + UDWF 注册）；新建 `engineering/src/db/ecosystem/builtin_functions.c`（内置 100+ 函数：数学/字符串/时间/数组/map/struct）。
  4. **SQL 解析 + 优化器增强**：扩展 `engineering/src/db/parser/` 集成 sqlparser-rs 风格；扩展 `engineering/src/db/optimizer/optimizer.c` + `optimizer_cost.c` 增加 CBO（Statistics + Histograms + LimitPushDown + Information Flow）。
- **投入**：约 8000-15000 行 C，1 人 4 周开发 + 1 周测试。
- **学习资源**：[datafusion.md §六](../db-wiki/extension/datafusion.md)（整体架构）+ [datafusion.md §八](../db-wiki/extension/datafusion.md)（Statistics + 文件级索引 + CBO）+ [datafusion.md §九](../db-wiki/extension/datafusion.md)（SQL + DataFrame + 自定义 UDF + TableProvider + Substrait + 向量化执行）。
- **验收标准**：
  - `engineering/test/db/ecosystem/table_provider_test.cpp` ≥ 8 用例（rel/KV/Vector/Columnar 表接入）通过；
  - `engineering/test/db/ecosystem/session_context_test.cpp` ≥ 6 用例（Session 隔离 + DataFrame API）通过；
  - `engineering/test/db/ecosystem/udf_registry_test.cpp` ≥ 12 用例（UDF/UDAF/UDWF + 100+ builtin）通过；
  - `engineering/test/db/optimizer/cbo_test.cpp` ≥ 6 用例（Statistics + Histograms + Information Flow + LimitPushDown）通过；
  - `engineering/src/db/ecosystem/CMakeLists.txt` + `engineering/src/db/optimizer/CMakeLists.txt` 通配新 .c 文件加入对应静态库。
- **优先级**：**P0**（决定 §4.2 与 DataFusion 41/42 TableProvider + UDF + LogicalPlan/PhysicalPlan + CBO + Substrait 对标）。

### 7.3 P0 — 启动 Velox Operator + Expression + MemoryPool 分层 + Spill-to-Disk + Connector framework（约 6 周）

- **动作**：
  1. **Vector 与 Type 系统**：新建 `engineering/include/db/velox/base_vector.h` + `engineering/src/db/velox/base_vector.c`（FlatVector/DictionaryVector/ConstantVector/LazyVector/ArrayVector/MapVector/RowVector/StructVector）；新建 `type_system.h` + `type_system.c`（scalar/complex/temporal/special 类型）。
  2. **Operator 抽象**：新建 `engineering/include/db/velox/operator.h` + `engineering/src/db/velox/operator.c`（Operator 基类 + TableScan/Filter/Project/HashBuild/HashProbe/MergeJoin/NestedLoopJoin/HashAggregation/Window/TopN/OrderBy/Limit/RowNumber 等 15+ 算子）；新建 `expression.h` + `expression.c`（Expr AST + Function Registry + CompiledExpression）。
  3. **MemoryPool 分层 + Spill**：新建 `engineering/src/db/core/memory_pool.c`（root → query → task → operator 四级 MemoryPool + Spillable Hash Table + Spill config + disk-spill/hash-spill/agg-spill）+ `engineering/src/db/core/spill_writer.c`（spill 到 SSD + 失败恢复）。
  4. **Connector framework**：新建 `engineering/src/db/velox/connector.{h,c}`（Connector 注册表 + Connector Factory）；新建 `engineering/src/db/velox/hive_connector.c`（Hive Connector）+ `iceberg_connector.c`（Iceberg Connector）+ `tpcds_connector.c`（TPCDS Connector）。
- **投入**：约 15000-25000 行 C（Vector + Operator + Expression + MemoryPool + Spill + Connector），1.5 人 5 周开发 + 1 周测试。
- **学习资源**：[velox.md §六](../db-wiki/extension/velox.md)（Operator + Expression 双抽象 + Vector + MemoryPool + Connector + 通用数据格式）+ [velox.md §八](../db-wiki/extension/velox.md)（Operator 向量化执行 + Expression Framework + HashTable + Adaptive Join + HashAggregation + Spill + Type 系统）+ [velox.md §九](../db-wiki/extension/velox.md)（Driver/Task 模型 + Pipeline + Operator/Function 详解）。
- **验收标准**：
  - `engineering/test/db/velox/base_vector_test.cpp` ≥ 8 用例（Flat/Dict/Constant/Row/Array/Map/Struct Vector）通过；
  - `engineering/test/db/velox/operator_test.cpp` ≥ 15 用例（TableScan/Filter/Project/HashBuild/HashProbe/HashAggregation/Window/TopN）通过；
  - `engineering/test/db/core/memory_pool_test.cpp` ≥ 8 用例（root/query/task/operator 四级 + Spillable）通过；
  - `engineering/test/db/core/spill_writer_test.cpp` ≥ 6 用例（disk-spill + 失败恢复 + Spillable Hash Table）通过；
  - `engineering/test/db/velox/connector_test.cpp` ≥ 6 用例（Hive + Iceberg + TPCDS + 自定义 Connector）通过；
  - TPC-H SF=1（5 个 query）端到端在 Velox Operator 上运行通过；
  - `engineering/src/db/velox/CMakeLists.txt` + `engineering/src/db/core/CMakeLists.txt` 通配新 .c 文件加入对应静态库。
- **优先级**：**P0**（决定 §4.3 与 Velox 0.36/0.37 Operator + Expression + MemoryPool + Spill + Connector framework 全方位对标）。

### 7.4 P1 — 启动多语言 SDK（Python + Rust + Java + Go 绑定）+ Flight SQL Server + Iceberg/Delta 适配（约 5 周）

- **动作**：
  1. **Python 绑定**：在 `engineering/sdk/python/` 下新建 pybind11 模块（`mm_ext_py.{hpp,cpp}` + `setup.py` + `mm_ext/__init__.py`）；实现 `pyarrow.RecordBatch` ↔ 自研 `arrow_array_t` 互转 + `register_udf` Python 风格 + `ctx.sql()` 入口。
  2. **Rust 绑定**：在 `engineering/sdk/rust/` 下新建 `lib.rs`（使用 bindgen + autocxx 或 cpp_build）+ Cargo.toml 依赖 arrow-rs；实现 `mm_ext::SessionContext` + `register_udf`。
  3. **Java 绑定**：在 `engineering/sdk/java/` 下新建 `com.book.ext` 包 + JNI 封装（`DB.java` + `SessionContext.java`）+ pom.xml 依赖 `org.apache.arrow:arrow-vector`。
  4. **Go 绑定**：在 `engineering/sdk/go/` 下新建 `mm.go`（cgo + 自动绑定）；实现 `mm.SessionContext` + `RegisterUDF`。
  5. **Flight SQL Server**：新建 `engineering/apps/flight_sql_server/main.cpp`（基于 `arrow-flight-sql` 实现）；新建 `engineering/sdk/odbc/` + `engineering/sdk/jdbc/`（ODBC + JDBC 驱动）。
  6. **Iceberg/Delta 适配**：新建 `engineering/src/db/storage/iceberg/`（Iceberg 表 + 时间旅行 + Schema Evolution）；新建 `engineering/src/db/storage/delta/`（Delta Lake 适配）。
- **投入**：约 10000-20000 行 C/C++ + Python + Rust + Java + Go，1.5 人 4 周开发 + 1 周测试。
- **学习资源**：[arrow.md §九](../db-wiki/extension/arrow.md)（Compute Kernel + Arrow Flight RPC）+ [arrow.md §十五](../db-wiki/extension/arrow.md)（生态与集成 + 客户端 SDK + ORM + BI + DataFrame）+ [velox.md §十五](../db-wiki/extension/velox.md)（生态 + Iceberg/Delta Lake + GPU + 云原生）。
- **验收标准**：
  - `python -c "import mm_ext; ctx = mm_ext.SessionContext(); df = ctx.sql('SELECT 1 + 1 AS x'); print(df.collect())"` 端到端可用；
  - Rust `mm_ext::SessionContext::sql("SELECT ...")` 端到端可用；
  - Java `com.book.ext.SessionContext ctx = ...; ResultSet rs = ctx.sql("SELECT ...")` 端到端可用；
  - Go `mm.SessionContext` 端到端可用；
  - `engineering/apps/flight_sql_server/` JDBC 客户端 `jdbc:arrow-flight-sql://localhost:8815/` 可连接 Superset/Tableau/PowerBI；
  - Iceberg 表 + 时间旅行 + Schema Evolution 端到端可用；
  - Delta Lake 适配端到端可用；
  - `engineering/sdk/{python,rust,java,go}/CMakeLists.txt` 各自构建绑定；
  - `engineering/src/db/storage/iceberg/CMakeLists.txt` + `engineering/src/db/storage/delta/CMakeLists.txt` 通配 .c 加入对应静态库。
- **优先级**：**P1**（决定 §4.4 与 Arrow 多语言 SDK + Iceberg/Delta Lake + BI/Notebook 集成对标）。

### 7.5 P1 — 启动公开 Bench（ClickBench 30/43 + TPC-H SF100 + H2O.ai）+ Async Runtime + K8s Operator + Serverless + Function Registry（约 5 周）

- **动作**：
  1. **公开 Bench Harness**：在 `engineering/bench/` 下新建 `clickbench/`（ClickBench 30/43 query 简化版）+ `tpch/`（TPC-H SF100）+ `h2o/`（H2O.ai groupby）+ `headtohead/`（vs DataFusion + Velox + DuckDB）；在 `docs/bench/` 发布 `ext-clickbench-2026-11.md` + `ext-tpch-2026-11.md` + `ext-h2o-2026-11.md`。
  2. **Async Runtime + sharded service**：在 `engineering/src/db/core/` 下新建 `async_runtime.{h,c}`（基于 Folly coroutine 简化版 + tokio 风格 Future）；新建 `sharded_service.{h,c}`（thread-per-core + CPU 亲和 + `invoke_on` 跨 shard RPC）。
  3. **K8s Operator**：在 `engineering/k8s/operator/` 下新建 CRD + Controller + StatefulSet + Service；新建 Helm Chart `engineering/k8s/helm/book-ext/`。
  4. **Serverless（Cloudflare Workers 风格）**：在 `engineering/apps/serverless/` 下新建 server（基于 Cloudflare Workers SDK 简化版 + io_uring Linux 5.10+）+ WASM 运行时。
  5. **Function Registry 完整版**：在 `engineering/src/db/extension/` 下新建 `func_registry.{h,c}`（100+ builtin 函数：数学/字符串/时间/数组/map/struct/lambda）；新建 `presto_fn.c` + `spark_fn.c` + `hll_fn.c` + `tpcds_fn.c` 4 套 Function 族。
  6. **Adaptive + Spill + GPU**：新建 `engineering/src/db/executor/adaptive.{h,c}`（Adaptive Hash Join 切换 + Hash Spill 调度 + Memory Spill Trigger）；新建 `engineering/src/db/executor/cudf.{h,c}`（GPU 算子实验）。
- **投入**：约 10000-18000 行 C + bench 自动化 + K8s Operator + Serverless，1.5 人 4 周开发 + 1 周测试。
- **学习资源**：[datafusion.md §九.6](../db-wiki/extension/datafusion.md)（向量化执行 + SIMD）+ [velox.md §十四](../db-wiki/extension/velox.md)（运维可观测性 + Operator-level stats + Spill 监控 + Backpressure）+ [velox.md §十二](../db-wiki/extension/velox.md)（扩展性 + 垂直水平 + K8s + GPU）+ [velox.md §十七](../db-wiki/extension/velox.md)（源码学习路径 + Operator/Expression/MemoryPool 实践）。
- **验收标准**：
  - `engineering/bench/clickbench/` 跑通 ClickBench 30/43 query + 输出对比表到 `docs/bench/ext-clickbench-2026-11.md`；
  - `engineering/bench/tpch/` 跑通 TPC-H SF100 + 输出对比表；
  - TPC-H SF=1 在扩展 Velox Operator 上 < 5s/query（vs 基础 10s/query）；
  - `engineering/src/db/core/async_runtime_test.cpp` ≥ 6 用例（Future + coroutine + 异常传播）通过；
  - `engineering/src/db/core/sharded_service_test.cpp` ≥ 6 用例（thread-per-core + CPU 亲和 + invoke_on）通过；
  - `engineering/k8s/operator/` `kubectl apply -f book-ext-crd.yaml` 端到端可用；
  - `engineering/apps/serverless/` Cloudflare Workers 风格部署 demo；
  - Function Registry `select count(*) from t` 在 100+ 函数库中可选 + 自定义注册；
  - Adaptive Hash Join 阈值切换 + Hash Spill 调度通过；
  - `engineering/src/db/extension/CMakeLists.txt` + `engineering/k8s/CMakeLists.txt` 通配对应 .c/.yaml 加入。
- **优先级**：**P1**（决定 §4.5 公开基准 + K8s + Serverless + Function Registry + Adaptive + Spill + GPU 对标）。

---

## 8. 附录 A — 自研与 Arrow / DataFusion / Velox 路径对照表

| 自研路径 | Arrow 对照路径 | DataFusion 对照路径 | Velox 对照路径 | 简述 |
|----------|----------------|---------------------|----------------|------|
| `engineering/src/db/ecosystem/plugin_manager.c` | N/A（C++ 静态链接 + Python pybind11） | N/A（Rust crate 静态编译 + Trait） | N/A（编译时链接） | 插件动态库加载 |
| `engineering/src/db/ecosystem/rest_server.c` | N/A（无 REST；Arrow Flight + IPC） | `datafusion/core/src/sql.rs` + `datafusion-cli` | `velox/serializers/PrestoPage.cpp` + Presto Coordinator | REST 接口暴露 |
| `engineering/src/db/ecosystem/grpc_server.c` | `cpp/src/arrow/flight/server.cc`（gRPC + FlatBuffers） | `ballista/scheduler/src/`（gRPC + proto） | Presto Thrift（`Prestissimo`）+ Gluten Java JNI | gRPC Server |
| `engineering/src/db/ecosystem/CMakeLists.txt` | `cpp/src/arrow/CMakeLists.txt` | `datafusion/core/CMakeLists.txt` | `velox/CMakeLists.txt` | 生态构建 |
| `engineering/src/db/optimizer/optimizer.c` | N/A（Arrow 无优化器） | `datafusion/optimizer/src/`（rules + physical + CBO） | N/A（执行引擎，优化由上游负责） | 优化器主入口 |
| `engineering/src/db/optimizer/optimizer_cost.c` | N/A | `datafusion/core/src/physical_plan/aggregates/` + Cost-based Optimizer | N/A | 优化器 cost 估算 |
| `engineering/src/db/optimizer/optimizer_parallel.c` | N/A | `datafusion/core/src/physical_plan/{filter,projection,sort}.rs` | `velox/exec/{Filter,Project,HashBuild}.cpp`（向量化执行） | 并行优化器规则 |
| `engineering/include/db/optimizer{,_cost}.h` | N/A | `datafusion/optimizer/src/` + `datafusion/core/src/physical_plan/expression/` | `velox/expression/Expr.h` | 优化器公共头 |
| `engineering/src/db/distributed/query/distributed_query.c` | N/A（Arrow 无分布式调度） | `ballista/scheduler/src/`（K8s 调度） | N/A（Velox 是执行引擎，调度由 Doris/Presto） | 分布式查询协调 |
| `engineering/src/db/distributed/query/CMakeLists.txt` | `cpp/src/arrow/flight/CMakeLists.txt` | `ballista/scheduler/CMakeLists.txt` | `velox/exec/CMakeLists.txt` | 分布式构建 |
| `engineering/src/db/distributed/rpc/rpc_stream.c` | `cpp/src/arrow/flight/{client,server}.cc`（gRPC + FlatBuffers） | `ballista/executor/src/`（gRPC + proto） | `velox/serializers/PrestoPage.cpp`（Thrift Page） | RPC 流式管道 |
| `engineering/include/db/distributed/{distributed_query,rpc,rpc_stream,tso,percolator,deadlock,mvcc_ts}.h` | `cpp/src/arrow/flight/client.h` | `datafusion-proto/src/` | `velox/connectors/{hive,iceberg,tpcds}/` | 分布式公共头 |
| `engineering/include/db/distributed/txn/` | N/A | N/A（DataFusion 无事务） | N/A（Velox 无事务） | 分布式事务 |
| `engineering/test/db/ecosystem/plugin_manager_test.cpp`（如存在） | `cpp/src/arrow/testing/...` | `datafusion/core/tests/...` | `velox/test/...` | 插件加载测试 |

## 9. 附录 B — 章节与 24 维度映射

| 报告章节 | 对应维度 |
|----------|----------|
| §1 自研现状 | 1、3、6、9、13、16、19 |
| §2.1 Arrow | 1-3、5-10、15、17、20、22 |
| §2.2 DataFusion | 1-3、5-6、11-14、16、18、20-22 |
| §2.3 Velox | 1-3、5-6、11、14、15、17-18、20、22 |
| §3 矩阵 | 全部 24 维度 + 1 扩展维度（与本项目关联） |
| §4.1 Arrow 列式内存 + IPC + Flight + Compute | 7、8、9、10、15、20 |
| §4.2 TableProvider + UDF + LogicalPlan/PhysicalPlan | 11、12、13、14 |
| §4.3 Operator + Expression + MemoryPool + Spill + Connector | 10、14、17、18 |
| §4.4 多语言 SDK + Flight SQL + Iceberg/Delta | 20、22 |
| §4.5 公开 Bench + K8s + Serverless + Function Registry | 17、18、21、22 |
| §5.1 插件动态加载 | 1、11、22 |
| §5.2 优化器代价模型插件化 | 11、13、22 |
| §5.3 分布式查询协调 | 16、22 |
| §6 学习路径 | 22 |
| §7.1 Apache Arrow 引入 | 7-10、15、20 |
| §7.2 DataFusion TableProvider + UDF | 11-14 |
| §7.3 Velox Operator + Expression + Spill | 10、14、17、18 |
| §7.4 多语言 SDK + Flight SQL + Iceberg | 20、22 |
| §7.5 公开 Bench + K8s + Serverless + Function Registry | 17、18、21、22 |
| §8 路径对照 | 23、24 |
| §9 本附录 | 全部维度 |

## 10. 元信息

- 报告作者：subagent-driven-development（gap-analysis Task 13 implementer）
- 关联文档：
  - `archive/.superpowers/sdd/gap-task-1-inventory.md` §11 extension（行 104-112 索引）
  - `archive/.superpowers/sdd/task-13-brief.md`（本次任务简报）
  - `docs/superpowers/plans/2026-10-16-gap-analysis-implementation.md` Task 13（待创建）
  - `docs/gap-analysis/2026-08-29-multimodal-db-gap-analysis.md`（旧版顶层分析，本篇不替代，仅纵向对照）
  - `docs/gap-analysis/relational.md`（姊妹篇，relational 子报告）
  - `docs/gap-analysis/key-value.md`（姊妹篇，key-value 子报告）
  - `docs/gap-analysis/document.md`（姊妹篇，document 子报告）
  - `docs/gap-analysis/columnar.md`（姊妹篇，columnar 子报告）
  - `docs/gap-analysis/time-series.md`（姊妹篇，time-series 子报告）
  - `docs/gap-analysis/search.md`（姊妹篇，search 子报告）
  - `docs/gap-analysis/vector.md`（姊妹篇，vector 子报告，旗舰参考）
  - `docs/gap-analysis/graph.md`（姊妹篇，graph 子报告）
  - `docs/gap-analysis/stream.md`（姊妹篇，stream 子报告）
  - `docs/gap-analysis/embedded.md`（姊妹篇，embedded 子报告）
- 行数目标：300-500（本篇实测见 §11 自检）
- 版本：v1（首稿，无迭代历史）

## 11. 自检（提交前 5 条验收）

- [x] **24 维度对照矩阵完整**：YES（§3 已列 25 行，含自研/Arrow/DataFusion/Velox/等级五列）
- [x] **Top-5 差距每条有具体代码路径/wiki 引用**：YES（§4 五条均含 `engineering/src/db/ecosystem/` + `engineering/src/db/distributed/query/` + `engineering/src/db/optimizer/` + `engineering/include/db/distributed/` + `engineering/include/db/ecosystem/` + Arrow/DataFusion/Velox wiki 路径）
- [x] **补齐项下月计划至少 3 条 P0/P1**：YES（§7.1 P0、§7.2 P0、§7.3 P0 + §7.4 P1、§7.5 P1，共 3 条 P0 + 2 条 P1；其中 §7.1 P0 「启动 Apache Arrow 引入」是**自研缺失维度**的明确动作）
- [x] **至少 5 处 engineering/ 真实路径引用**：YES（§1 列 16 条路径、§4 列 5 条、§7 引用 30 条、§8 表格 14 条，**总计 ≥ 65 处真实 engineering 路径引用**）
- [x] **至少 2 个 wiki 链接引用**：YES（§6 列出 9 个 wiki 章节链接 + §2 与 §7 多处内联 wiki 相对路径，**总计 ≥ 21 处 wiki 链接引用**）
- [x] **目标行数 300-500**：实测见下表

行数实测（章节）：

- §1 自研现状：~78 行
- §2 业界主流：~75 行
- §3 24 维度对照矩阵：~40 行
- §4 Top-5 差距：~75 行
- §5 优势 Top-3：~28 行
- §6 学习路径：~35 行
- §7 补齐项下月计划：~85 行
- §8-§11 附录+元信息+自检：~60 行
- **合计：~476 行 markdown**（在 300-500 行目标区间内）

---

> 注意：本报告是基于 2026-10-16 自研现状的静态差距分析；后续 Apache Arrow / DataFusion / Velox 任一集成启动或 Phase 9 分布式演进完成时需重读并刷新 §1、§3、§4 与 §7。**作为 extension 子报告特别提示**：本篇是 13 子报告中**自研插件 + 分布式协调齐备但缺列式内存 + 跨语言 SDK + 向量化执行引擎**的方向（plugin_manager + REST/gRPC + optimizer 代价 + distributed_query + TSO + Percolator + 死锁检测，但缺 Arrow 列式内存 + IPC + Flight + Compute Kernel + DataFusion TableProvider + UDF/UDAF/UDWF + Velox Operator + Expression + MemoryPool 分层 + Spill + Connector framework + 多语言 SDK + Iceberg/Delta Lake + 公开 Bench），未来引入 Apache Arrow 作为列式内存 + 跨语言 SDK 底座时建议将 Top-5 §4.1 + §4.2 + §4.3 作为对外宣传的核心故事——**「插件动态加载 + 优化器 cost 插件化 + 分布式 RPC + TSO + Percolator + 死锁检测」** 配合 §7.1 「启动 Apache Arrow 引入」P0 动作，将是 RAG / 多模态 DB / 实时分析场景下最关键的扩展性抓手。
