# LakeHouse Catalog Server（Spring Boot + JPA）

使用 Spring Boot 与 JPA 实现 Apache Paimon 的 **REST Catalog API**（OpenAPI 规格 v1）。
服务扮演目录（catalog）角色：集中保存 database、表 schema、快照、分支、标签、分区、
视图与函数的元数据，供 Flink / Spark 等支持 LakeHouse Catalog 协议的引擎通过 HTTP 读写。

同时实现了 Apache Polaris 的 **REST Management API**（`/api/management/v1`）：
主体、principal role、catalog role 与资源授权的完整 RBAC 管理面，
既是管理接口，也是 catalog API 上权限判定的依据。

- 规格来源：
  - Catalog API：[`docs/static/rest-catalog-open-api.yaml`](https://github.com/apache/paimon/blob/master/docs/static/rest-catalog-open-api.yaml)
    （随仓库副本：`spec/rest-catalog-open-api.yaml`，运行时也可从 `/rest-catalog-open-api.yaml` 下载）
  - Management API：`spec/polaris-management-service.yml`（随仓库副本，运行时可从
    `/polaris-management-service.yml` 下载）
- 规格规模：Catalog API **60 个端点、144 个 schema**
  （端点清单见 [`docs/catalog-api-endpoints.md`](docs/catalog-api-endpoints.md)）；
  Management API 的 **3 个权限端点**（官方）+ 扩展端点（catalog / principal / 角色 / 优化）
  （概览见 [`docs/management-api-overview.md`](docs/management-api-overview.md)）
- 元数据存储：**MySQL 8.0**（建表语句由实体生成，见 `sql/schema-mysql.sql`；
  20 张表的划分与设计取舍见 [`docs/data-model.md`](docs/data-model.md)），
  通过 JPA 访问；另有 H2 内存库与 PostgreSQL 两个 profile 可选
- 模块：**12 个 Maven 模块**——服务端拆为 `core`（与格式无关的地基）/ `storage`（FileIO）/
  `protocol-paimon`（Catalog API）/ `protocol-iceberg`（Iceberg REST）/ `server`（可执行）五个，
  Spark SQL 扩展再拆 `common` + `3.5` + `4.1` 三个，另有表存储优化任务、两个父 POM 与根聚合 POM；
  Web 控制台是 Vite 工程，不走 Maven。目录见第 1 节
- 表格式：**Paimon 表**与三种不受快照管理的表——**Format 表**（目录里的既有文件）、
  **Object 表**（对象元数据，列由 Paimon 固定）、**Lance 表**；类型写在
  `schema.options.type` 里，建表时的归一化与边界见第 6 节第 23 条。后三种的位置就是
  数据目录本身，可以由建表请求里的 `path` 指定（指向一个已经存在的目录，如对象存储上
  放图片的前缀），不指定则由目录按模板分配。
  其中 **Lance 表只登记不读写**（Paimon 2.0.0 未实现，见
  [`docs/spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md) §4.4）：
  接口照常接受建表请求，控制台的新建表表单不给入口
- 默认表属性：catalog 的 `properties` 里写 `table-default.<属性名>`（如
  `table-default.deletion-vectors.enabled=true`），新建 **Paimon 表**时自动带上该属性
  （去前缀、表级参数优先）；控制台入口是 Catalog 详情页的「配置」页签。见
  [第 6 节第 24 条](#6-实现要点与边界)与
  [`docs/catalog-api-endpoints.md`](docs/catalog-api-endpoints.md#catalog-级默认表属性table-default)

---

## 1. 工程结构

```
paimon-rest/
├── Dockerfile               服务端镜像（单阶段：装预构建的 jar，见第 8 节）
├── pom.xml                  根聚合 POM：lakehouse-rest-parent（无父 POM，见「模块划分的取舍」）
├── lakehouse-rest-spring-parent/     服务端世界的父 POM（继承 Spring Boot 父 POM）
│   ├── pom.xml                       只有 POM、没有源码；五个服务端模块嵌在它下面
│   ├── lakehouse-rest-core/          与表格式无关的地基：鉴权、授权、JPA 实体与仓储、协议分派、共享 DTO 词表
│   ├── lakehouse-rest-storage/       数据目录文件访问与 FileIO 构造（唯一允许依赖 paimon-core 的非协议模块）
│   ├── lakehouse-rest-protocol-paimon/  Paimon 协议面：Catalog API 全部 60 个端点
│   ├── lakehouse-rest-protocol-iceberg/ Iceberg 协议面：35 个端点里实现的 30 个 + `iceberg-core` 元数据代数
│   └── lakehouse-rest-server/        可执行服务端：Management API + 控制台 API + 优化调度，最终 jar 在这里
├── lakehouse-rest-console/     Web 管理控制台（Vue 3 + Vite，产物构建进服务端，见第 9 节）
├── lakehouse-rest-spark/       Spark SQL 语法扩展：用 SQL 管理主体、角色与授权
│   ├── shared/                 两个 Spark 版本共用的源码（语法 + Scala 层 + 测试）
│   ├── lakehouse-rest-spark-common/  REST 客户端：纯 Java，无 Spark 依赖
│   ├── lakehouse-rest-spark-3.5/     Spark 3.5.9 / Scala 2.12 / ANTLR 4.9.3
│   └── lakehouse-rest-spark-4.1/     Spark 4.1.2 / Scala 2.13 / ANTLR 4.13.1
├── lakehouse-rest-optimizer/   表存储优化任务（Spark，由服务端投到 k8s 运行）
├── deploy/kubernetes/       Kubernetes 部署清单（kustomize 组装，见其目录下的 README）
├── spec/                    OpenAPI 规格副本（两套协议面各一份）
├── sql/                     MySQL 建表语句（由实体生成，见第 7 节「代码生成」）
├── docs/                    设计文档、契约基线与 SQL 语法参考
└── scripts/                 验收、代码生成、文档校验与镜像构建脚本
```

**两个协议面在同一个进程、同一个 `/v1` 基址、同一套元数据库上服务。**
一个 catalog 只有一种格式（`lakehouse_catalog.catalog_format`，创建时定下、不可变），
因此「路径 → `{prefix}` → catalog → 格式 → 协议处理链」这条链上唯一需要判断的地方
就是 core 的协议分派；两个面本身互不认识，也不互相依赖（见第 3 节与
[`iceberg-rest-catalog-design.md`](docs/iceberg-rest-catalog-design.md)）。

**模块划分的取舍：两个父 POM ＝ 两个依赖世界。**

根 `pom.xml`（`lakehouse-rest-parent`）是**纯聚合器**，同时充当 `lakehouse-rest-spark-parent`
与 `lakehouse-rest-optimizer` 的父 POM，**刻意不继承** `spring-boot-starter-parent`：
Spark 自带的 Jackson 2.15.2 会被 Boot 的 `dependencyManagement` 抬到 2.21.x，
netty 与 jersey 也会被替换，导致 Spark 侧出现难以定位的版本冲突。

服务端那五个模块则挂在 **`lakehouse-rest-spring-parent`** 下，由它继承 Spring Boot 父 POM，
并统一声明 webmvc / data-jpa / validation / lombok 这几个共用 starter。
两个依赖世界因此互不污染：服务端是 Spring Boot 4 / Jackson 3 / Hibernate 7，
Spark 侧是 Scala 2.12 / Spark 3.5 / Jackson 2 / ANTLR 4.9.3。

服务端模块**嵌在** `lakehouse-rest-spring-parent/` 目录之下，因此各子模块的 `<parent>`
**不需要写 `<relativePath>`**——默认的 `../pom.xml` 恰好就是那份父 POM。
这一点是嵌套布局立下的功劳：若把五个模块放成仓库根下的平级兄弟目录，就必须显式写
`<relativePath>../lakehouse-rest-spring-parent/pom.xml</relativePath>`，
因为默认值会解析到根聚合器，那里没有这个 artifactId，Maven 便回退去远程仓库找，
离线构建会直接失败。**不要把 Boot 提为根聚合器的父 POM。**

三条依赖不变量由 `maven-enforcer-plugin` 守住（`core` 不含任何表格式依赖；两个协议面互不依赖；
`iceberg-core` 只在 `protocol-iceberg` 里出现），违反即构建失败——这些规则不是文档约定，
是构建期断言。完整依赖图与规则细节见
[`maven-module-design.md`](docs/maven-module-design.md)。

Maven 坐标与包名：`groupId` 为 `io.github.melin`，十二个 artifact 是
`lakehouse-rest-parent`（聚合）、`lakehouse-rest-spring-parent`（服务端父 POM）、
`lakehouse-rest-core`、`lakehouse-rest-storage`、`lakehouse-rest-protocol-paimon`、
`lakehouse-rest-protocol-iceberg`、`lakehouse-rest-server`、
`lakehouse-rest-spark-parent`（Spark 侧聚合）、`lakehouse-rest-spark-common`、
`lakehouse-rest-spark-3.5`、`lakehouse-rest-spark-4.1`、`lakehouse-rest-optimizer`。
两个 Spark 版本模块都产出「语法扩展 + 客户端」可用的 jar：一个是给 Spark 3.5 的，
一个是给 Spark 4.1 的，装哪个由集群版本决定（见第 5 节）。
包前缀为 `io.github.melin.lakehouse.rest`（三轮改定：`io.github.melin.paimonrest` →
`io.github.melin.lakehouse.rest` → 本名 → 各协议面再加一层格式子包，主前缀与 artifactId 的
`lakehouse` 对齐），Spark 模块在其下再用 `.spark` 子包（如
`io.github.melin.lakehouse.rest.spark.ManagementSparkExtensions`）。
服务端的 core / storage / server 共用一个包树
（`io.github.melin.lakehouse.rest.{web,service,domain,dto,support,config}`），
好处是搬类不需要改任何 `import`、也不需要动 `@ComponentScan`；
代价是包名不再告诉你类在哪个模块，只能看它在哪个目录。
**协议面例外**：Paimon 面的类独占 `io.github.melin.lakehouse.rest.paimon.{web,service,dto,support}`
子树、Iceberg 面同理独占 `…rest.iceberg.*`，两者与 core 的 `rest.{dto,service,support,web}`
平级而不重合——协议面注定有两个且互不依赖，删掉或新增一整面不会波及另一面。
因此**同一个前缀不能出现在两个面里**：两套规格里唯一真冲突的两条
（`POST /v1/{prefix}/tables/rename`、`…/views/rename`）上移到 core 的
`CatalogRenameController`，否则 Spring 会以 `Ambiguous mapping` 拒绝启动。

**这一处改名会打到用户，因此留了兼容壳。** `spark.sql.extensions` 填的是全限定类名，
包名一改，既有部署的 Spark 会话会在初始化时报 `ClassNotFoundException`——错误离「升级了
服务端依赖」很远，不容易查。于是 Spark 模块里曾保留**最初**包名下的同名空壳（只继承新实现、不覆盖任何方法）。
该空壳已按当初的约定删除——它只是过渡，确认没有部署再用旧名字之后就不再保留；
**新部署请写新包名** `io.github.melin.lakehouse.rest.spark.ManagementSparkExtensions`。
中间那个 `io.github.melin.lakehouse.rest` 从未提交、也就从未发布，所以没有为它另留一个壳——
壳的数量等于「历史的对外名字数」，不是「改过几次」。
其余位置都不涉及外部契约：配置前缀已从 `paimon.rest.*` 直接改到 `lakehouse.rest.*`（尚无部署
写过旧键，属于一次性对齐而不是迁移，见
[`maven-module-design.md`](docs/maven-module-design.md) §4.3(1)）；k8s 资源名
没跟着改，理由见下一段；数据库表名已从 `paimon_` 改成 `lakehouse_`（见
[`data-model.md`](docs/data-model.md) §6）。

k8s 资源名的 `paimon-` 前缀**故意不改**：它不是产品名，是历史标识，改了要动存量部署
（StatefulSet 与 PVC 引用）。见
[`maven-module-design.md`](docs/maven-module-design.md) §8.6。

`docs/` 里二十份文档的分工：

| 文档 | 读它的时机 |
| --- | --- |
| [`catalog-api-endpoints.md`](docs/catalog-api-endpoints.md) | 要查 Catalog API 有哪些端点——Paimon 的 60 个与 Iceberg 的 26 个按资源分组，含基址、前缀与授权映射说明 |
| [`management-api-overview.md`](docs/management-api-overview.md) | 要读 Management API——官方权限端点与扩展端点各落在哪几个控制器上、几处容易读错的语义 |
| [`management-api-contract.md`](docs/management-api-contract.md) | 要查管理 API 的端点、字段、权限枚举——由规格生成，逐字对照 |
| [`data-model.md`](docs/data-model.md) | 要改实体或看表结构——20 张表的划分、摘要列与审计列的设计理由、实体与仓储分在哪两个模块、`lakehouse_` 前缀（原 `paimon_`）的来历与 §6 的迁移方案（原子 rename、回滚、验收） |
| [`spark-sql-reference.md`](docs/spark-sql-reference.md) | 要用 SQL 管理主体与授权——语句级参考，含完整示例 |
| [`spark-sql-extension.md`](docs/spark-sql-extension.md) | 要改这个 Spark 扩展——语法扩展的做法、两个必须知道的约束、测试分层 |
| [`spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md) | 要让 Spark 通过本服务端建 Paimon 表——连接配置、可执行的 SQL、报错对照表 |
| [`spark-iceberg-rest-e2e.md`](docs/spark-iceberg-rest-e2e.md) | 要让 Spark 通过本服务端建 Iceberg 表——`spark.sql.catalog.*` 配置、可执行的 SQL、与 Paimon 那套的差异对照 |
| [`authorization.md`](docs/authorization.md) | 要理解权限怎么判——实体链、授权映射、失败关闭的取舍 |
| [`console.md`](docs/console.md) | 要改 Web 控制台或排查「页面空列表」——前端分层、端点契约表、机械校验 |
| [`console-table-detail.md`](docs/console-table-detail.md) | 要改表详情页——页签随表格式（Paimon / Format / Object / Lance）伸缩的数据来源、为什么授权不在这页、破坏性操作与边界 |
| [`console-catalog-detail.md`](docs/console-catalog-detail.md) | 要改 Catalog 详情页或仓库文件浏览——三个页签、下钻与路径防护、只读的取舍、「配置」页的默认表属性（`table-default.*`）编辑与并发冲突处理；建表表单里的默认参数预填与为什么不给 Lance 表建表入口 |
| [`console-auth.md`](docs/console-auth.md) | 要给浏览器访问控制台配登录——三种登录方式、两个开关的边界、令牌与认证链、安全考量 |
| [`polaris-capabilities-and-design.md`](docs/polaris-capabilities-and-design.md) | 要对比 Polaris 或看整体设计——核心能力提取、映射关系、已知缺口 |
| [`event-framework.md`](docs/event-framework.md) | 要加一种事件、接一个 listener 或理解事件流的边界——9 类 33 个领域事件与触发点、与 Polaris 事件枚举的逐类映射、audit_event 表、发布监听链路、按监听器的类别/类型订阅（`lakehouse.rest.event-listener.*`）、增量拉取契约（`?since=` 游标 + `?category=`）与不发清单 |
| [`iceberg-rest-catalog-design.md`](docs/iceberg-rest-catalog-design.md) | 要看「同一份元数据同时服务 Paimon 与 Iceberg」怎么做的——双协议方案：创建时区分格式、22 张表复用只加 9 列、路径冲突与错误模型、能力边界与效果图（`outputs/iceberg-rest-catalog/mockup.html`），以及**已落地的实测记录与与方案不一致的几处**（§11） |
| [`generic-table-design.md`](docs/generic-table-design.md) | 要把 parquet / orc / lance / vortex 目录也纳入目录服务，或评审「通用表」方案——**设计稿，未实现**：Polaris Generic Table 的事实基线、四种格式的能力矩阵、复用 `lakehouse_table` 加 `table_kind` 的三方案对比、4 个端点与权限映射、凭据下发为什么是唯一的数据面控制点、Spark 侧按格式分派（`FileTable` 子类 / `ServiceLoader<TableProvider>`）、影响面与风险 |
| [`metrics-design.md`](docs/metrics-design.md) | 要加指标、接 Prometheus 或判断「这个指标该不该打标签」——**设计稿，未实现**：Polaris telemetry 的事实基线（HTTP / API / 持久化 / 缓存四类来源，`realm_id` 基数闸门与「超限即停记」、SLO 显式桶、Iceberg 客户端用量报告与运维指标的区别）、`lakehouse.*` 指标目录与 <1500 的基数预算、标签黑名单与 catalog 折叠成 `__other__`、切面替代逐端点 `@Timed`、管理端口 8081 + ServiceMonitor、告警与看板、`verify-metrics-doc.py` 一致性校验 |
| [`maven-module-design.md`](docs/maven-module-design.md) | 要改模块布局或 artifact 名——`lakehouse-rest-*` 命名定案、两个父 POM / 两个依赖世界、三条用 enforcer 守住的依赖不变量、改名清单与「哪四处故意不改」（§8.6），以及**已落地**的实测记录（§8，含与设计不一致的六处及原因） |
| [`table-optimization.md`](docs/table-optimization.md) | 要改表存储优化或排查优化任务——三个动作的语义、批次与并发两道闸门、k8s 提交与状态跟踪、控制台两处页面 |

---

## 2. 快速开始

前置条件：构建与测试用 **JDK 17 或 21**；**运行服务端必须用 JDK 17**（避开 18 及以上）；
运行服务端需要一个 MySQL 8.0 实例。

### 2.1 准备数据库

元数据默认存放在 MySQL。首次部署先建库建表：

```bash
mysql -h 127.0.0.1 -u root -p < sql/schema-mysql.sql
```

`sql/schema-mysql.sql` 由 `scripts/gen-mysql-ddl.sh` 从 JPA 实体生成（23 张表、21 个唯一约束、
26 个索引），**不要手工修改**——下次生成会覆盖。它会建出 `lakehouse_catalog` 库并切过去，
库名与 `application.yml` 里的 `spring.datasource.url` 必须一致（用 `DB_NAME=... ` 重新生成可改）。

连接信息默认是 `127.0.0.1:3306`、库 `lakehouse_catalog`、账号 `paimon/paimon`，
可用 `SPRING_DATASOURCE_URL` / `--spring.datasource.username` 等覆盖。

启动时的 `ddl-auto` 是 **`validate`**：库结构与实体不一致会直接启动失败，
而不是悄悄改表。所以升级代码后如果实体有变，需要重新生成 DDL 并自行迁移。

### 2.2 构建与运行

```bash
# 全量构建（9 个模块；用 install 而不是 package，因为模块之间有内部依赖）
JAVA_HOME=/path/to/jdk-21 mvn -o -DskipTests install

# 只要服务端可执行 jar：-am 会一并构建它依赖的 core / storage / 两个协议面
JAVA_HOME=/path/to/jdk-21 mvn -o -DskipTests -pl :lakehouse-rest-server -am clean package

# 运行全部测试（服务端 346 + Spark 107，共 453 个用例；Spark 侧有 1 个示例用例
# 在本地缺 spark.sql.extensions 时会失败，见第 7 节）
JAVA_HOME=/path/to/jdk-21 mvn test

# 启动服务端（默认 8080 端口，连 MySQL，预置 catalog prefix=paimon 与 database=default）
# 这里必须是 17：运行服务端要避开 JDK 18+ 的 InetAddress 解析器 SPI，理由见本节开头
JAVA_HOME=/path/to/jdk-17 mvn -pl :lakehouse-rest-server spring-boot:run

# 打包后直接运行（同样用 17 起的 JDK）
java -jar lakehouse-rest-spring-parent/lakehouse-rest-server/target/lakehouse-rest-server-0.0.1-SNAPSHOT.jar
```

`clean` 不能省：控制台产物按内容哈希命名，`maven-resources-plugin` 只覆写不删除，
不 clean 会让 `target/classes/static/console` 累积历次旧产物（jar 里出现多个 `index-*.js`）。
服务端 POM 已把一次 `clean` 绑到 `initialize` 兜底，所以 `mvn package` 也能干净——但 `-pl` 之外的场景仍建议手写。

构建过程中 `maven-enforcer-plugin` 会校验三条依赖不变量（见第 1 节），
所以「构建成功」本身就包含了一次模块方向检查；它失败时的报错信息是中文的，会指出违反的是哪条。

只需一个即用即丢、不依赖 MySQL 的实例时，用内存 H2：

```bash
java -jar lakehouse-rest-spring-parent/lakehouse-rest-server/target/lakehouse-rest-server-0.0.1-SNAPSHOT.jar --spring.profiles.active=h2
```

冒烟验证：

```bash
# 1) 目录发现，拿到 prefix
curl -s "http://localhost:8080/v1/config?warehouse=paimon"
# {"defaults":{"warehouse":"file:///tmp/paimon-warehouse","prefix":"paimon"},"overrides":{}}

# 2) 建库
curl -s -X POST http://localhost:8080/v1/paimon/databases \
  -H 'Content-Type: application/json' \
  -d '{"name":"sales","options":{"owner":"paimon"}}'

# 3) 建表
curl -s -X POST http://localhost:8080/v1/paimon/databases/sales/tables \
  -H 'Content-Type: application/json' \
  -d '{"identifier":{"database":"sales","object":"orders"},
       "schema":{"fields":[{"id":0,"name":"id","type":"BIGINT NOT NULL"},
                           {"id":1,"name":"amount","type":"DECIMAL(10, 2)"},
                           {"id":2,"name":"dt","type":"VARCHAR(10)"}],
                 "primaryKeys":["id"],"partitionKeys":["dt"],
                 "options":{"bucket":"2"},"comment":"订单表"}}'

# 4) 查询
curl -s http://localhost:8080/v1/paimon/databases/sales/tables/orders

# 5) 管理面：列出现有 catalog（开启授权后需要 Bearer 令牌）
curl -s http://localhost:8080/api/management/v1/catalogs -H 'Authorization: Bearer root'
```

### 2.2.1 直接看界面

上面的操作都有对应的界面，不用写 curl：服务端自带 Web 管理控制台，
构建产物已经提交在仓库里，**启动后就能用，不需要 Node**。

```bash
open http://localhost:8080/console/
```

它覆盖 Catalog API（库表视图函数、快照标签分支、数据令牌与查询授权）与
Management API（catalog、主体、角色、catalog 角色与 grants）两个 API 面，
首页还有一个「连接自检」，逐个探测控制台依赖的端点——地址或令牌配错时，
它会把失败的那一个连同 HTTP 状态一起列出来，而不是让你对着空列表猜。

控制台**默认就要求登录**（`lakehouse.rest.auth.console.required=true`），
默认账号密码 `admin/admin` —— 装好即可进入，不需要先建主体。
登录方式有三种可同时启用（用户名密码 / 主体凭据 / 外部 IdP 的 SSO），
也可以直接在「连接设置」里填静态令牌。**登录页只列出服务端真的开启了的方式**：
关掉的、没配令牌的都不显示，一个都没开时页面会说明该开哪个配置项。
完整说明见第 9 节与
[`docs/console.md`](docs/console.md)（控制台总览）、
[`docs/console-table-detail.md`](docs/console-table-detail.md)（表详情页）、
[`docs/console-auth.md`](docs/console-auth.md)（登录与鉴权）。

> **这层门禁只挡住界面。** 默认 `lakehouse.rest.auth.enabled=false`，
> 因此 `curl /v1/config` 与管理 API 仍然匿名可调。要保护数据必须把 `auth.enabled`
> 设为 `true`；服务端在「门禁开着而鉴权关着」时会在启动日志里告警。

### 2.3 数据源 profile

| profile | 数据源 | 建表方式 | 用途 |
| --- | --- | --- | --- |
| （默认） | MySQL 8.0 | `sql/schema-mysql.sql` + `ddl-auto: validate` | 正常部署 |
| `h2` | 内存 H2 | `ddl-auto: update` | 本地调试、端到端脚本 |
| `postgresql` | PostgreSQL | `ddl-auto: update` | 备用；**未做端到端验证** |

```bash
mvn -pl :lakehouse-rest-server spring-boot:run -Dspring-boot.run.profiles=h2
mvn -pl :lakehouse-rest-server spring-boot:run -Dspring-boot.run.profiles=postgresql
```

---

## 3. 架构

```
lakehouse-rest-spring-parent/
  lakehouse-rest-core/          与格式无关的地基
    web/          两套协议共用的端点：/v1/config、/v1/oauth/tokens、两条同路径 rename
    service/      协议分派（CatalogFormat / CatalogProtocol / CatalogProtocols）、错误形状判定、RBAC 判定
    domain/       JPA 实体与仓储（22 张表）
    dto/          两套规格共用的 DTO 词表、管理 API 与远程控制台契约
    support/      公共设施：JSON 编解码、schema 字段树、分页、路径、错误、存储配置
    config/       服务端配置、Bearer 鉴权、授权拦截器、启动初始化
  lakehouse-rest-storage/       数据目录文件访问与 FileIO 构造（路径 + 文本的窄契约）
  lakehouse-rest-protocol-paimon/   Paimon 面：60 个端点、Paimon DTO 与元数据代数
    web/          按规格路径一一对应的控制器
    service/      目录解析、schema 变更、快照与版本、分区分支标签；格式门禁在 DatabaseService
  lakehouse-rest-protocol-iceberg/  Iceberg 面：30 个端点、Iceberg DTO 与元数据代数
    web/          namespace / table / view 三棵控制器
    service/      update 代数、requirements 校验、CAS 提交、投影派生
    support/      元数据文件命名、端点清单（endpoints）、update 编解码
  lakehouse-rest-server/        可执行产物与「不属于任何协议面」的东西
    web/          管理 API 的 4 个控制器、控制台扩展端点
    service/      管理服务、控制台 meta、凭据与存储策略、优化调度
    config/       数据源 profile、启动预置（DataInitializer）

lakehouse-rest-spark/        一份源码、两个版本产物（Spark 3.5 与 4.1）
  shared/src/main/antlr4/…/ManagementSql.g4   管理语句语法（16 条语句、15 条规则）
  shared/src/main/scala/…                      Spark 层共享源码（两个版本各编一遍）
    ManagementCommands.scala                   13 个 RunnableCommand：语句 → HTTP 调用
    ManagementAstBuilder.scala                 语法树 → 命令
    AbstractLakehouseRestSqlParser.scala           解析器共享部分：先试管理语法，失败即交回
    ManagementSparkExtensions.scala             会话注入点与配置读取
  shared/src/test/…                            共享测试（两个版本各跑一遍）
  lakehouse-rest-spark-common/src/main/java/…/client/   REST 客户端（JDK HttpClient + Jackson 2）
  lakehouse-rest-spark-3.5/…/LakehouseRestSqlParser.scala  3.5 侧：无版本特有成员
  lakehouse-rest-spark-4.1/…/LakehouseRestSqlParser.scala  4.1 侧：补 parseRoutineParam
```

关键设计：

- **前缀路由 + 格式分派**：`{prefix}` 是 catalog 的对外标识，由 `GET /v1/config` 下发。
  未登记的 prefix 在 `lakehouse.rest.auto-create-catalog=true`（默认）时自动登记，客户端可零配置接入。
  一个 catalog 只有一种**格式**（`catalog_format`，创建时定下、不可变），它决定这个 prefix
  服务哪一套协议：路径 → prefix → catalog → 格式 → 协议处理链。两个面互不依赖，
  装配层靠 Spring 收集 `List<CatalogProtocol>` 拿到它们，因此 core 不需要认识任何一个面。
- **格式不匹配要报「格式不对」**：一个 Iceberg 客户端敲了 Paimon catalog 的 prefix（或反过来）
  时回 404，消息里点出两个格式——否则客户端只会以为自己的库名/表名写错了。
  自动登记时**按请求所属的面的格式建**，避免「一次失败的请求留下一个格式不对的 catalog」。
- **认证与授权分离**：`BearerAuthInterceptor` 只回答「调用者是谁」，RBAC 判定由授权层完成。
  两者分别由 `lakehouse.rest.auth.*` 与 `lakehouse.rest.authorization.*` 控制，可以只开认证不开授权。
- **catalog API 的授权映射集中在一张表**：`CatalogAccessRules` 把 `/v1/**` 路径映射到所需权限，
  **未登记映射的端点直接拒绝而不是放行**；测试从运行时的请求映射里枚举全部端点核对覆盖率，
  新增端点若忘记登记会让构建失败。详见 `docs/authorization.md`。
- **两套错误形状，按请求所属的协议面二选一**：Paimon 是扁平的
  `{message, resourceType, resourceName, code}`，Iceberg 是嵌套一层的
  `{error: {message, type, code}}`。判据优先看路径形状（两套规格用的是不同的资源名词），
  只在四条同路径端点上回落到按 catalog 格式查。
- **JSON 文档列**：schema、函数定义、分区 spec、Iceberg 的整份 `TableMetadata` 等结构以
  JSON 文本存单列，实体字段保持强类型，避免为每个属性建表；复杂结构通过 `AttributeConverter` 转换。
- **多态变更分派**：规格中 `SchemaChange` / `ViewChange` / `FunctionChange` 是以 `action`
  判别的多态联合，统一按 `List<Map<String,Object>>` 接收后在服务层按 `action` 分派，
  不把多态解析绑死在具体 JSON 库上。Iceberg 的 `MetadataUpdate` 也走同一条路子。
- **管理语句靠语法而非前缀识别**：Spark 3.5 的 SQL 语法没有兜底分支，无法用 visitor 拦截
  新关键字，因此 Spark 子模块自带一份只描述管理语句的语法，解析成功才接管，失败原样交回。

两份 API 与元数据的清单不在本文展开：Catalog API 的
[Paimon 60 个与 Iceberg 30 个端点](docs/catalog-api-endpoints.md)、Management API 的
[操作概览](docs/management-api-overview.md)（逐字契约见
[`management-api-contract.md`](docs/management-api-contract.md)）、以及
[23 张表的数据模型与设计取舍](docs/data-model.md)。

---

## 4. Spark SQL 扩展

`lakehouse-rest-spark` 把管理 API 接进 Spark SQL，16 条语句覆盖主体、principal role、装配、授权与查询：

```sql
CREATE PRINCIPAL svc_etl PROPERTIES ('owner' = 'data-platform');
CREATE PRINCIPAL ROLE etl_engineer;
GRANT PRINCIPAL ROLE etl_engineer TO PRINCIPAL svc_etl;
GRANT LIST, DESCRIBE, SELECT ON CATALOG_ALL paimon TO USER svc_etl;
SHOW PERMISSIONS IN CATALOG paimon FOR USER svc_etl;
```

资源授权用的是**官方权限模型**（`GRANT <access> ON <资源> TO <授权对象>`，
与「权限管理」页同一条链路）；挂在 catalog role 上的 Polaris 授权与 catalog role 本身
都没有 SQL 语句，只剩管理 API。

启用方式、逐条语句的语法 / 参数 / 结果列 / 错误处理见
[`docs/spark-sql-reference.md`](docs/spark-sql-reference.md)（语句级参考）；
实现动机、语法扩展的做法与测试分层见
[`docs/spark-sql-extension.md`](docs/spark-sql-extension.md)。

参考文档里的内容不是手写断言，而是有机械校验兜底：`scripts/verify-spark-sql-doc.py`
比对文档的语句清单、`PermissionDtos`、客户端代码，参考文档第 10 节的示例还会被 `SparkSqlDocExamplesTests`
对着真实服务端执行一遍——**改坏示例会让构建失败**。

两个必须知道的约束：

- **ANTLR 版本必须与目标 Spark 发行版一致。** Spark 3.5.9 自带 `antlr4-runtime` 4.9.3，
  其 `SqlBaseLexer` 就是用 4.9.3 生成的。若本模块把运行时抬到 4.13.x，会把 Spark 自己的
  运行时顶掉，导致**整个会话的 SQL 解析**（包括 `SELECT 1`）在类初始化阶段失败。
  升级 `spark.version` 时必须同步核对根 `pom.xml` 里的 `antlr.runtime.version`。
- **`spark.sql.extensions` 的扩展点只能包装、不能改写语法。** Spark 3.5 的 `SqlBase.g4`
  没有兜底分支，因此本模块自带一份管理语句语法，先试自己的解析器，失败即把语句原样交回
  原生解析器——判断依据是「能否整句匹配到 EOF」，不是字符串前缀。

---

## 5. 配置项

Catalog 侧与鉴权：

| 配置 | 默认值 | 说明 |
| --- | --- | --- |
| `lakehouse.rest.default-prefix` | `paimon` | `GET /v1/config` 未指定 warehouse 时的 prefix |
| `lakehouse.rest.default-warehouse` | `file:///tmp/paimon-warehouse` | 默认仓库位置 |
| `lakehouse.rest.auto-create-catalog` | `true` | 未登记 prefix 是否自动登记 |
| `lakehouse.rest.path-template` | `{warehouse}/{database}.db/{table}` | 表路径模板 |
| `lakehouse.rest.default-page-size` | `100` | 默认分页大小 |
| `lakehouse.rest.max-page-size` | `1000` | 分页大小上限 |
| `lakehouse.rest.auth.enabled` | `false` | 是否要求数据接口带 Bearer 令牌（`/v1/**`、`/api/catalog/v1/**`、`/api/management/v1/**`） |
| `lakehouse.rest.auth.principal` | `anonymous` | 认证关闭或未带令牌时使用的主体名 |
| `lakehouse.rest.auth.tokens` | 空 | 允许的静态令牌列表（给机器用）；**配置了才会在登录页出现「静态令牌」页签** |
| `lakehouse.rest.auth.token-principals` | 空 | 静态令牌 → 主体名映射；未登记时退化为「令牌即主体名」（审计列放不下的长度会记摘要，见第 6 节第 19 条） |
| `lakehouse.rest.auth.access-token.ttl` | `1h` | 控制台签发的访问令牌有效期（唯一能限制令牌泄露窗口的参数） |
| `lakehouse.rest.auth.access-token.signing-key` | 空 | HS256 签名密钥，Base64 且解码后 ≥32 字节；**留空则每次启动随机生成**（多实例互不认、重启掉线），生产必须配 |
| `lakehouse.rest.auth.console.required` | `true` | 浏览器进控制台是否必须先登录。**只作用于控制台界面与 `/api/console/v1/**`，不是安全边界** |
| `lakehouse.rest.auth.console.password.enabled` | `true` | 允许用配置里的用户名 + 密码换访问令牌 |
| `lakehouse.rest.auth.console.password.users` | `admin: admin` | 控制台账号表（明文，可写 `${ENV_VAR}`）；**生产必须改**，启动日志会告警 |
| `lakehouse.rest.auth.console.password.principals` | 空 | 账号名 → 主体名映射；未登记时两者同名 |
| `lakehouse.rest.auth.console.password.rate-limit.max-failures` / `.window` | `5` / `1m` | 该方式的失败限速（比客户端凭据更严：猜的是人定的密码） |
| `lakehouse.rest.auth.console.client-credentials.enabled` | `true` | 允许用主体 `clientId` / `clientSecret` 换访问令牌 |
| `lakehouse.rest.auth.console.client-credentials.rate-limit.max-failures` / `.window` | `10` / `1m` | 该方式的失败限速 |
| `lakehouse.rest.auth.console.oidc.*` | 关闭 | 外部身份提供方（OIDC + PKCE）登录，见 [`console-auth.md`](docs/console-auth.md) |
| `lakehouse.rest.credential.ttl-seconds` | `3600` | 数据访问令牌有效期 |

表元数据物化（把 schema 写进 Paimon 表目录，见
[`docs/spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md) 第 4 节）：

| 配置 | 默认值 | 说明 |
| --- | --- | --- |
| `lakehouse.rest.table-metadata.enabled` | `true` | 建表 / 改表 / 回滚 schema 时是否写 `<table>/schema/schema-<n>`，以及提交 / 回滚快照时是否写 `<table>/snapshot/snapshot-<n>`。关掉只对「服务端刻意不持有仓库写权限」的部署有意义：此时用 REST catalog 读写仍正常（读路径也走服务端），但绕开服务端直接看仓库是一张没有元数据的表 |
| `lakehouse.rest.table-metadata.fail-on-error` | `false` | 物化失败时是否让请求失败（500 且事务回滚）。默认尽力而为，只记 WARN；打开后建表与提交快照会因仓库不可写而直接失败，适合「宁可建不出表，也不要有表写着写着写不进去」的部署 |
| `lakehouse.rest.table-metadata.purge-on-drop` | `false` | `DROP TABLE` 时是否连表目录一起删。默认只删元数据、保留数据；关着时「删表 → 同名重建」会撞 `Schema in filesystem exists, creation is not allowed.`，需手工清目录或把这一项打开。只删非外部表 |

仓库在对象存储上时，服务端自己也需要对应 scheme 的 FileIO 实现
（`paimon-core` 只带 `file` / `hdfs` / `viewfs`），详见上述文档第 4.2 节。

管理面授权（RBAC）：

| 配置 | 默认值 | 说明 |
| --- | --- | --- |
| `lakehouse.rest.authorization.enabled` | `false` | 是否对 `/api/management/v1/**` 与 `/v1/**` 启用权限判定 |
| `lakehouse.rest.authorization.service-admins` | `[root]` | 服务管理员主体名单：可管理主体与 principal role，并可在任意 catalog 上操作角色与授权 |
| `lakehouse.rest.authorization.bootstrap-principal` | `root` | 启动时预置的引导主体；留空则不预置 |
| `lakehouse.rest.authorization.bootstrap-principal-role` | `service_admin` | 启动时预置的引导角色链 |

管理面启动时会预置：引导主体、引导 principal role，以及各 catalog 的 `catalog_admin` 角色。
没有这条引导链，全新部署里没有任何主体能创建第一个主体。

存储与凭据，对应 Polaris 1.8.0 配置参考的
[Storage & Credentials](https://polaris.apache.org/releases/1.8.0/configuration/configuration-reference/#storage--credentials)
一节，键名逐项对应，只把前缀从 `polaris` 换成 `lakehouse.rest`：

| 配置 | 默认值 | 说明 |
| --- | --- | --- |
| `lakehouse.rest.storage.aws.access-key` | 空 | S3 默认凭据；留空则退化为环境凭据链 |
| `lakehouse.rest.storage.aws.secret-key` | 空 | 同上 |
| `lakehouse.rest.storage.aws.storages.<name>.access-key` | 空 | 具名存储，键为 catalog 的 `storageConfigInfo.storageName` |
| `lakehouse.rest.storage.aws.storages.<name>.secret-key` | 空 | 同上 |
| `lakehouse.rest.storage.gcp.token` | 空 | GCS 访问令牌；留空则交给引擎自己的凭据链 |
| `lakehouse.rest.storage.gcp.lifespan` | 空 | GCS 令牌有效期；比 `credential.ttl-seconds` 短时收窄 `expiresAt` |
| `lakehouse.rest.storage.obs.access-key` | 空 | 华为云 OBS 默认凭据；三项全空则退化为环境凭据链 |
| `lakehouse.rest.storage.obs.secret-key` | 空 | 同上 |
| `lakehouse.rest.storage.obs.session-token` | 空 | OBS 临时凭据的安全令牌；长期凭据留空 |
| `lakehouse.rest.storage.obs.storages.<name>.access-key` | 空 | OBS 具名存储，另支持 `.secret-key` / `.session-token` |
| `lakehouse.rest.storage.oss.access-key` | 空 | 阿里云 OSS 默认凭据 |
| `lakehouse.rest.storage.oss.secret-key` | 空 | 同上 |
| `lakehouse.rest.storage.oss.session-token` | 空 | OSS 临时凭据的安全令牌（阿里侧键名为 `securityToken`） |
| `lakehouse.rest.storage.oss.storages.<name>.access-key` | 空 | OSS 具名存储，另支持 `.secret-key` / `.session-token` |
| `lakehouse.rest.storage.credential-secret-key` | 空 | catalog 自带静态凭据的落库加密密钥，Base64 且解码后**恰好 32 字节**；留空则关闭静态凭据，见下方说明 |
| `lakehouse.rest.storage.clients-cache-max-size` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage.max-http-connections` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage.read-timeout` | 空 | 读取超时；正数校验 |
| `lakehouse.rest.storage.connect-timeout` | 空 | 建连超时；正数校验 |
| `lakehouse.rest.storage.connection-acquisition-timeout` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage.connection-max-idle-time` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage.connection-time-to-live` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage.expect-continue-enabled` | 空 | 保留项，见下方说明 |
| `lakehouse.rest.storage-credential-cache.max-entries` | `10000` | 已下发凭据的复用上限，条目按各自过期时间失效 |
| `lakehouse.rest.credential-manager.type` | `default` | `default` 下发凭据；`noop` 不下发，读表接口返回 501 |
| `lakehouse.rest.file-io.type` | `default` | 本部署接入的存储实现：`default`/`s3`/`azure`/`gcs`/`obs`/`oss`/`local` |

`lakehouse.rest.storage.obs.*` 与 `lakehouse.rest.storage.oss.*` 两组**没有 Polaris 侧的对应项**
——Polaris 没有这两个存储类型，它在 S3 兼容层上接入华为云与阿里云。
本工程单列，是为了让这两家的 AK/SK 独立于 S3 那一份，各按各自的节奏轮转与授权。

**catalog 自带的静态凭据**是另一处在 Polaris 规格之外的扩展：
`S3` / `OBS` / `OSS` 三种 `storageConfigInfo` 都多出 `accessKeyId` 与 `secretAccessKey`
两个字段，填写后该 catalog 就用这把钥匙访问对象存储，不必把密钥写进服务端配置。
参照 Polaris 的路径接入不提供 STS 的兼容 S3 存储（MinIO、Ceph RGW、Ozone、FlashBlade 等）
要写 `stsUnavailable: true`，此时服务端不再下发任何密钥，引擎只能靠自己的凭据链；
静态凭据补上的正是这一格——它表达的是「下发用户自己填进来的长期密钥」，
与 `stsUnavailable` 的「服务端不去向云申请临时凭据」是两件事，
因此**静态凭据排在 `stsUnavailable` 之前**，两者同时出现不冲突。

- `accessKeyId` 可读可写。它不是秘密，保留下来是为了让控制台能显示「配的是哪把钥匙」，
  也是判断这个 catalog「有没有配凭据」的依据。
- `secretAccessKey` **只写不读**。落库前用 AES-GCM（AES-256）加密，任何响应都不回显，
  因此 `PUT` 省略它表示**保持原值**而不是清空——这是规格 `PUT`「整体替换」语义的唯一例外，
  否则每次改 `endpoint` 都得重新贴一遍密钥。
- 想清除已配的凭据，显式提交一对空串（控制台表单里有「移除已保存的静态凭据」按钮），
  之后下发退回服务端配置那一级。只给其中一个会返回 400：有密钥没 ID、换 ID 不带新密钥、
  空 ID 配非空密钥，都无法区分是笔误还是有意为之。
- 静态凭据与 `storageName` **互斥**，两者都在回答「用哪组密钥」，同时出现返回 400。
- 未配 `credential-secret-key` 时**拒绝保存**静态凭据（400，错误信息给出生成命令
  `openssl rand -base64 32`），而不是明文落库；取值不是 Base64 或解码后不是 32 字节则启动即失败。
  轮换该密钥要注意：旧密文用新密钥解不开，读取该 catalog 的凭据会以 500 明确失败，
  不会静默退回服务端配置，需要重新提交一次凭据。

「保留项」指这些取值会被校验并在启动时打进日志，但当前实现没有出网的对象存储客户端，
JDK 的 `HttpClient` 也没有对应的调节项，因此它们不改变行为。保留是为了让配置面与 Polaris
一一对应，迁移时不必删配置。`read-timeout` 与 `connect-timeout` 之外的连接池参数属于此类。

`lakehouse.rest.file-io.type` 决定 catalog 允许的 `storageType`：`default` 接受全部六种，
`s3`/`azure`/`gcs`/`obs`/`oss` 只接受对应云存储加 `FILE`，`local` 只接受 `FILE`。
不接受本部署没有实现的存储类型时，创建或修改 catalog 直接返回 400，而不是让错误
推迟到引擎第一次读写时才以文件系统异常暴露。`FILE` 在所有取值下都保留，它是本地的退路。

`lakehouse.rest.credential-manager.type=noop` 适合引擎自带云凭据的部署。
关掉下发之后，引擎的凭据来源只剩一个，排查权限问题时不必再去猜
「到底用了服务端给的那份还是它自己那份」。

数据访问凭据下发按 catalog 的存储类型分派，各类型产出的键：

| storageType | 下发的键 | 密钥来源 |
| --- | --- | --- |
| `S3` | `s3.access-key-id`、`s3.secret-access-key`、`s3.access-key`、`s3.secret-key`、`s3.region`、`s3.endpoint`、`s3.path-style-access` | catalog 静态凭据 → 具名存储 → 默认配置 → 环境凭据链 |
| `AZURE` | `azure.tenant-id`、`azure.account`、`azure.hierarchical`、`azure.multi-tenant-app-name`、`azure.consent-url` | 仅定位元数据，见下 |
| `GCS` | `gcs.oauth2.token`、`gcs.oauth2.token-expires-at`、`gcs.service-account` | 服务端配置 → 环境凭据链 |
| `OBS` | `fs.obs.access.key`、`fs.obs.secret.key`、`fs.obs.session.token`、`fs.obs.endpoint` | 具名存储 → 默认配置 → 环境凭据链 |
| `OSS` | `fs.oss.accessKeyId`、`fs.oss.accessKeySecret`、`fs.oss.securityToken`、`fs.oss.endpoint` | 同上 |
| `FILE` | 自包含令牌（`accessKeyId`/`securityToken`/`expiration`/`tablePath`） | 服务端自签，文件系统本身不校验 |

`OBS` 与 `OSS` 都是兼容 S3 协议的对象存储，但**键名族互不通用，也都不认 `s3.*`**：
Paimon 的 `paimon-obs` 与 `paimon-oss` 是两个独立的 FileIO。两家的命名风格还不一致——
华为是点分隔小写（`fs.obs.access.key`），阿里是驼峰（`fs.oss.accessKeyId`）；
连「临时凭据的令牌」都不同名（`session.token` 对 `securityToken`）。
这些差异来自各自的 Hadoop FileSystem（`hadoop-huaweicloud` 与 `hadoop-aliyun`），不是笔误，
改「统一」会让其中一侧静默失效：引擎只是拿不到凭据，然后在第一次读数据时以看似无关的文件系统异常失败。

`endpointInternal`、`stsEndpoint`、`roleArn`、`externalId`、`userArn` 一律不下发：
前者规格明确写了客户端看不到，后三者是服务端去换临时凭据的材料。
下发的键名写错不会报错，只会让引擎静默拿不到凭据，因此每种类型都有断言键名本身的测试。

**S3 是唯一要下发两套密钥键名的一族**，因为两个消费方叫法不同：
规格（Polaris / Iceberg）叫 `s3.access-key-id` / `s3.secret-access-key`，
Paimon 叫 `s3.access-key` / `s3.secret-key`，两边互不认识。
只给规格键名时，Paimon 的 `paimon-s3` 会把 `s3.access-key-id` 翻译成
`fs.s3a.access-key-id`——Hadoop 里没有这个键，它的镜像表只认
`fs.s3a.access.key` / `fs.s3a.secret.key`，于是密钥被**静默丢弃**，
引擎退回默认凭据链并报 `NoAuthWithAWSException: No AWS Credentials provided by ...`。
这个异常类来自插件的隔离类加载器，Spark 上报时序列化不到 driver，
最终在用户面前只剩一句 `UnknownReason`。同时下发两套，两边才都能用。

仍可用 S3 类型接入华为云与阿里云：两者都提供 S3 兼容端点，把 `endpoint` 指向该端点即可。
代价是拿不到厂商原生的临时凭据键与凭据提供器配置，且多依赖一层协议转换。

Azure 只下发定位元数据是个明确的缺口：Polaris 的 `polaris.storage.*` 里没有 Azure 账户密钥这一项，
它靠服务进程自身的 Azure 标识签 SAS，而本工程没有那层标识。硬造一个签名错误的 SAS
比不给更糟，因此这里传租户与账户，由引擎用它自己的身份换取访问权。

---

## 6. 实现说明与已知边界

以下取舍在实现时已经明确，便于按需替换：

1. **`list-by-filter` 返回超集**。规格允许响应是匹配集合的超集，要求客户端复核谓词并继续翻页。
   当前实现不解析 `filter` 谓词表达式，直接返回全部（可选按名称前缀收窄）分区，属于合法的超集实现。
   若需精确下推，应在此处接入 Paimon 的 `Predicate` 反序列化与表达式求值。
2. **`pagesToken` 为无状态偏移量**。`base64url("offset:N")`，服务端不保存游标。
3. **可空性编码在类型名中**。规格的 `DataField` 没有独立可空字段，因此按 Paimon 惯例
   以 `"INT NOT NULL"` 形式表达，这也是 `updateColumnType` 需要 `keepNullability` 参数的原因；
   该变更只支持基本类型列。
4. **`drop database` 级联删除**。规格的删除接口没有 cascade 参数，这里按级联实现：
   先清理库内的表（含分区、消费者）、视图、函数、语义视图，再删除 database。
5. **表重命名不改数据位置**。只更新目录中的名称与所属 database，与 Paimon 服务端一致；
   因此磁盘上的目录名不会跟着变。目标名已被占用时返回 409——「改成与原名相同」也走这条，
   控制台在本地拦下并当作无操作（否则点一下确定就会收到一句莫名的「表已存在」）。
6. **`rollback-schema` 递增版本号**。回滚把历史内容写入新的 `schemaId`，而不是退回版本号，
   保证快照与 schema 的对应关系单调。
7. **`commit` 乐观并发**。`baseSnapshotUuid` 与当前最新快照不一致时返回 `success=false`，
   由客户端重试，而不是抛错。
8. **凭证下发为自包含令牌**。`token` 端点签发随机的短期凭据并带上过期时间；
   生产环境应替换为对接云 IAM 的 STS 调用。
9. **`auth` 的列校验**。请求列不在表 schema 中时返回 403；当前不配置行过滤与列脱敏策略，
   因此返回空的过滤表达式与脱敏映射。
10. **静态令牌的映射是静态配置**。`lakehouse.rest.auth.token-principals` 决定
    「静态令牌 → 主体名」，因此改这个映射要重启。**但这不再限制新建的主体**：
    创建主体时会一次性返回 `clientId` 与明文 `clientSecret`，用它们走
    `POST /api/catalog/v1/oauth/tokens`（OAuth 2.0 客户端凭据）换一个访问令牌，
    立刻就能调管理 API 或进控制台——不需要改配置、不需要重启。
    需要接入统一登录时用 `console.oidc`（外部身份提供方）。
    详见 [`console-auth.md`](docs/console-auth.md)。
11. **行过滤与列脱敏策略尚未实现**。Polaris 治理面中的这两项不在当前范围，
    `auth` 端点返回空的过滤表达式与脱敏映射，只做列存在性校验。
12. **多权限授权不是原子的**。规格没有批量授权端点，`GRANT a, b ON ...` 会顺序发出多次调用，
    中途失败时前面的已经生效。
13. **`{prefix}` 的校验语义由服务端自行约定**。规格把 `prefix` 声明为必填路径参数，
    但未定义「prefix 与服务端不一致时如何响应」。本实现把 prefix 视为 catalog 标识：
    已登记则解析到对应 catalog，未登记时按 `lakehouse.rest.auto-create-catalog` 决定
    自动登记或返回 404。默认值 `true` 使客户端可零配置接入，代价是写错 prefix 时
    会得到一个新的空 catalog 而不是报错；生产环境建议设为 `false`，
    由 `lakehouse.rest.initial-catalog.databases` 预置允许的 prefix。
14. **`ddl-auto` 是 `validate`，不做自动迁移**。库结构由 `sql/schema-mysql.sql` 管理，
    实体与库不一致时应用直接启动失败。这样避免 Hibernate 在生产库上执行隐式 `alter table`，
    代价是实体变更后必须重新生成 DDL 并自行迁移存量数据（本工程未内置迁移工具，
    若需要可接入 Flyway / Liquibase，把 `sql/schema-mysql.sql` 作为首个版本）。
15. **超长文本列的实际容量受 MySQL 的 TEXT 类型限制**。`length = 65535` 的列在 MySQL 上
    落为 `text`（上限 65535 **字节**，utf8mb4 下约 1.6 万个汉字），`length = 1048576` 以上
    落为 `mediumtext`（上限约 16 MB）。对存 JSON 元数据足够，但若某个 catalog 的
    schema 文本极大，需要留意这一上限。
16. **MySQL 上的布尔列是 `bit`**。Hibernate 把 Java `boolean` 映射为 MySQL 的 `bit`，
    功能正常但与多数人手写的 `tinyint(1)` 不同，写外部 SQL 时注意。
17. **服务端不只存元数据，还把 schema 与快照物化到 Paimon 表目录**。建库建表、读元数据、
    删除、写入（`INSERT` / `CREATE TABLE ... AS SELECT`）都可用。写入之所以曾经不可用，
    是因为引擎提交快照前要在仓库里读 `<table>/schema/schema-<n>` 取 schemaId，而服务端那时
    只把 schema 存进了自己的数据库；补上物化（`TableMetadataService`）之后这条链路通畅。
    快照文件（`<table>/snapshot/snapshot-<n>`）是同一件事的另一半：`RESTCatalog` 声明
    `supportsVersionManagement()`，提交快照由服务端代收，客户端从不自己写这份文件——
    而 REST 的读路径也走服务端，所以缺了它只会表现为「绕开服务端看仓库时没有 snapshot 目录」。
    服务端因此需要 Paimon 核心与 FileIO 依赖，并能写仓库——仓库在对象存储上时还要给服务端加
    对应 scheme 的 FileIO 实现。三档开关与取舍见
    [`docs/spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md) 第 4 节。
18. **存储配置的跨类型字段被静默忽略**。`storageType` 为 `FILE` 却带 `roleArn` 的请求
    不会报 400，而是丢掉该字段——全站都依赖 Spring 默认的宽松绑定，为存储配置单独收紧
    会造成「只有这个接口严格」的不一致。代价是拼错的字段名不会被发现。
19. **审计列存的是主体名，超过 255 字符时记摘要**。`owner` / `created_by` / `updated_by`
    是 `varchar(255)`，而主体名的长度没有上界：认证链认不出令牌时会退化为「令牌即主体名」，
    控制台签发的访问令牌就有 272 个字符，于是写入以
    `Data too long for column 'created_by'` 失败——现象是「建表/建库报 500」，
    从错误信息里看不出与认证有关。因此落库前统一在 `AuditedEntity` 归一化
    （`AuditPrincipal.of`）：放得下的原样存，放不下的记 `sha256:<前 12 位>`。
    **不截断**：截断会把凭据的前 255 个字符原样写进元数据库，而元数据是能被列表接口读出来的。
    超长时启动日志会告警一次，给出的解法是配 `lakehouse.rest.auth.token-principals`
    把令牌映射成真正的名字。授权判定读的是未归一化的主体名，两者互不影响。
    **刻意不通过加宽这三列来解决**：它们会被接口原样返回，加宽等于让凭据明文入库并可被读回；
    且主体名长度没有上界，加宽只是把溢出推后，还要对 14 张表共 42 个列做迁移。
20. **静态凭据的加密密钥不支持多代共存**。`lakehouse.rest.storage.credential-secret-key`
    换值后，库里已有的密文用新密钥解不开，读取那个 catalog 的凭据会以 **500** 明确失败
    （不是静默退回服务端配置），需要重新提交一次凭据。做成多代密钥要同时保存密钥列表与
    「这条密文是第几代」，当前规模下不值得；代价是**轮换密钥必须配合一次凭据重录**。
21. **运行服务端只能用 JDK 17，不能用 18 及以上。** 第 17 条说服务端要把 schema 与快照
    写进仓库；仓库在对象存储上时，这条链路在 JDK 18+ 上**必然失败**，且报错与 S3 毫无关系：
    JDK 18 的 JEP 418 给 `InetAddress` 加了解析器 SPI，`InetAddress.loadResolver()` 会
    `ServiceLoader` 找 `InetAddressResolverProvider`；而 Paimon 2.0.0 的 `paimon-s3` 插件包把
    dnsjava 那个 provider 的声明放在插件根、实现类放在 `META-INF/versions/18/`
    （多版本 jar 布局，解成插件目录后不再生效），`PluginFileIO` 又把线程上下文类加载器切成
    插件 loader，于是那块作用域里任何 `InetAddress` 解析都抛
    `ServiceConfigurationError: ... DnsjavaInetAddressResolverProvider not found`，
    触发点是 Hadoop `MetricsSystemImpl.getHostname()`。
    服务端对这种失败的处理是**按配置降级**：`ServiceConfigurationError` 属于 `Error`，
    已与 `LinkageError` 一起被 `TableMetadataService.attempt()` 接住，因此默认
    （`fail-on-error=false`）只记一条 WARN、建表照样成功——但仓库里那份 schema / 快照
    就是写不出去。所以「S3 表建得出来、用 REST 读写也正常，桶里却没有 `schema/` 与
    `snapshot/`」这个现象，先查服务端跑在哪个 JDK 上。
    `Dockerfile` 的运行镜像钉 17 就是为了这条；17 没有这条 SPI，问题不存在。
    这是上游插件打包的问题，不是本仓库代码的问题。
22. **快照的文件统计取决于客户端送不送 `statistics`**。`getTableSnapshot` 回的 `TableSnapshot`
    里只有 `recordCount` 来自快照本身（`totalRecordCount`）；`fileCount` / `fileSizeInBytes` /
    `lastFileCreationTime` **不在快照文件里**——Paimon 的快照只记清单指针，这三个数由 `commit`
    请求随带的 `statistics`（各分区在本次提交里的增量）累计到上一个快照行上得到，
    所以它们只可能和提交方一样准。客户端没送 `statistics` 时三项为 `null`（控制台显示 `—`，
    页脚注明「快照未带文件统计」）——那不是 0，也不是服务端漏算。要做到「精确等于最新快照引用的
    数据文件」得读清单（manifest），那会把仓库 I/O 搬进读路径，当前刻意不做。
    升级前写下的快照行没有这三个值，下一次提交会按分区合计补齐（累加规则与分区统计同一处实现）；
    在那次提交到来之前，**最新快照**的读路径也会按分区合计现算兜底——分区统计从更早的版本就在
    维护，老表升级后立即有值，不必等新提交。历史快照不做这个兜底：分区合计只对应当前状态，
    套在旧快照上是错的数。
23. **非 Paimon 表（Format / Object / Lance）的位置可由客户端指定，列不按用户声明的写**。
    表格式写在 `schema.options.type` 里（规格的 `Schema` 没有类型字段，Paimon 自己也是这么
    表达的，SQL 侧同样是 `WITH ('type' = 'format-table')`）。建表时 `support/TableKinds`
    做三件事：**`path` 缺省时才补**（引擎构造这三种表时只读 `options.path`；客户端给了就用
    客户端的——那三种表的位置就是数据目录本身，与上游 `JdbcCatalog.createObjectTable` 的
    `putIfAbsent` 同序）、
    **Object 表换成固定六列** `path` / `name` / `length` / `mtime` / `atime` / `owner`
    （用户声明的字段被忽略，镜像上游 `buildObjectTableSchema`）、**Format 表带主键直接 400**。
    其余类型取值一律 400——写进库的话，引擎读表时才在 `CoreOptions.TYPE` 的枚举上炸，
    出错现场离原因太远。
    客户端给的 `path` 还必须**同时**成为表的「表位置」（`GetTableResponse.path`）：Paimon 的
    REST 客户端在 load 表时用响应里的表位置**覆盖** `options.path`
    （`RESTCatalog.toTableMetadata` 用的是 `put`，不是 `putIfAbsent`），只把位置留在 options 里，
    引擎读的仍会是目录按 `path-template` 分配的那个目录——对象目录里的东西一个也看不到。
    这类表按**外部表**登记（`isExternal=true`）：服务端不往里写元数据，删表也不删它的目录。
    物化因此分三档：**客户端指定了目录的一律不写**、**Object 表写 `schema-0`**（位置由目录
    分配时；镜像上游 `JdbcCatalog.createObjectTable`，代价是查询结果会列出这份 schema 文件
    自己）、**Format 表与 Lance 表不写**——Format 表的读路径把表目录下所有非隐藏文件当数据，
    写进去的 JSON 会被当数据文件读（parquet 直接报 `not a Parquet file`，CSV 更糟：不报错、
    当数据行返回），Lance 目录则由 lance 自己管理。
    Object 表也**没有 `INSERT`**（Spark 侧只声明 `BATCH_READ`，Paimon 侧的 `ObjectTableImpl`
    是 `ReadonlyTable`）：它的行是读的时候现列目录算出来的，所以「写入」= 用存储侧的手段把对象
    放进那个目录（`aws s3 cp` / `hdfs dfs -put` / 应用自己的 SDK），下次查询即可见，
    **没有 refresh 这一步**（见 `docs/spark-paimon-rest-e2e.md` §4.4.1）。
    数据由引擎直接读写那个目录，因此快照、标签、分支、分区状态与提交累计的文件统计都不适用：
    控制台只给它们「详细信息」与「文件列表」两个页签，详细信息页里也不画那四张统计卡片。
    三者中 **Lance 表只登记不能读写**（Paimon 2.0.0 未实现，见
    [`docs/spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md) §4.4），
    服务端照常接受它的建表请求，控制台的新建表表单把它标成不可选。
24. **catalog 级默认表属性（`table-default.*`）只作用于新建的 Paimon 表**。
    catalog 的 `properties` 里 `table-default.<属性名>` 的项，建表时**去掉前缀**写进表属性
    （`support/TableDefaults`）。四条边界：**表级参数优先**（只做 `putIfAbsent`，
    默认值是缺省而不是约束——要强制取值该用 `overrides`）、**只对 Paimon 表生效**
    （Format / Object / Lance 的 `options` 描述各自的表格式，塞进 Paimon 表属性只会在仓库的
    `schema-0` 里留噪音）、**`type` 不接受默认**（表格式由建表请求决定，否则一次 catalog
    配置会让此后所有新表换格式）、**只在建表时合并**（已建成的表不受影响，改它的属性是
    `alter` 的范畴）。默认值放在 `properties` 而不是 `defaults` / `overrides`：后两者是随
    `GET /v1/config` 下发给引擎的**连接参数**，改它影响的是客户端能否连上。Spark SQL 建表走的
    同样是 `POST .../tables`，因此引擎侧不需要各做一遍。
25. **Iceberg 协议面：30 个端点（一期 26 + 二期 4），5 个不声明；一个 catalog 一种格式，建完改不了。**
    Iceberg 面与 Paimon 面**共用同一份元数据**（22 张表全部复用、只加 9 列，
    见 [`docs/data-model.md`](docs/data-model.md) §1.1），但对外是**第二个协议面**，
    能力比 Paimon 面窄一截，且其中几处是「明确不做」而不是「还没做」。

    - **不声明的 5 个端点**：`plan`（`POST` 建 / `GET` 拉 / `DELETE` 取消）、
      `tasks`、`sign` 明确不做——扫描规划要一个常驻执行引擎、远程签名要 KMS，
      都是另一个产品的份量。二期的 functions 只读两个、`register-view`、
      `transactions/commit` 已实现并写进声明清单。逐条清单在
      [`docs/iceberg-rest-catalog-design.md`](docs/iceberg-rest-catalog-design.md) §6.1，
      **代码里有两处副本且必须逐字一致**：`IcebergEndpoints` 的类注释与
      `scripts/verify-iceberg-endpoints.py` 的 `NOT_IMPLEMENTED`。
      这份清单同时是 `GET /v1/config` 里 `endpoints` 字段的内容：Iceberg 规格规定
      **不发这个字段等于承诺一整套默认端点**，而那份默认清单比实现面宽——
      少发一个字段的后果是客户端一路正常，直到用户真的发起一次未实现的操作才炸，
      而那时错误现场离原因已经很远（客户端报的是
      `Server does not support endpoint: …`，看着像服务端坏了一半）。
    - **一个 catalog 只有一种格式，且创建后不可改**（`lakehouse_catalog.catalog_format`，
      非空 + 库级默认 `'PAIMON'`）。管理 API 的 `PUT` 改了它一律 400，
      理由是改格式会让既有表在同一份元数据上突然按另一套语义解释。
      由此推出一个**明确不支持**的用法：**同一个仓库目录不能既当 Paimon 又当 Iceberg 用**——
      那是两个 catalog、两份互不可见的元数据。共用一个目录而两边都能读，要求两种格式的
      元数据互相翻译，是另一个量级的工作。
    - **两条 `rename` 是唯一真冲突**（`POST /v1/{prefix}/tables/rename`、`…/views/rename`）：
      HTTP 方法与路径逐字相同，而两个协议面又禁止互相 import（enforcer 守着），
      所以上移到 core 的 `CatalogRenameController`，由 `CatalogProtocol#rename` 分派。
      格式判据两层：**先查库里 prefix 的格式**，查不到才看请求体字段名
      （`{namespace: […], name}` 是 Iceberg、`{database, object}` 是 Paimon）。
      两边**成功状态码不同**——Paimon 200、Iceberg 204，分派层按格式各自返回。
    - **错误报文形状按协议面二选一**（Paimon 扁平、Iceberg 在 `error` 里再嵌一层；
      形状选错时 Iceberg 客户端拿不到 `error` 字段，只会报一句没有 message 的
      「Unable to process」）。判据是**路径形状优先、catalog 格式兜底**：两个规格选了
      不同的资源名词（`databases` / `namespaces`），绝大多数请求只看路径就能定，
      只有四条需要查库。这里有个必须写对的细节：判「某面独有」时要把**集合路径本身**
      （`/v1/{prefix}/namespaces`）也算上，只匹配 `namespaces/` 前缀会漏掉它——
      漏掉的后果不是少判一条，而是**判给另一个面**（见
      `CatalogFormatResolver#firstSegmentIs` 的注释）。
    - **表的写路径是「先写仓库、后落库」**：`metadata/vN-<uuid>.metadata.json`
      先进表目录，再提交元数据行；并发靠 DB 的 `metadata_location` 做 CAS，
      叠加客户端 `requirements` 的双向校验。因此一次失败的提交**不留半成品**——
      仓库里可能多一个没被引用的 metadata 文件，但库里那行不会被改成指向它。
      这也是 Iceberg 表与 Paimon 表在物化时机上的差别：Iceberg 的元数据文件是
      **提交链的一部分**，而 Paimon 那份 `schema-0` 是投影（缺了不阻断请求，
      见第 23 条）。
    - **Iceberg 侧没有四类 Paimon 语义**：分区状态、消费者位点、语义视图、数据访问
      （授予 / 凭据）这四类端点在 Iceberg 协议里不存在。**目录浏览与表详情都按格式分两套实现**：
      Paimon catalog 走 `/v1/{prefix}/databases/**`，Iceberg catalog 走
      `IcebergBrowseView`（`namespaces/**`：命名空间平铺、建表 / 登记 / 改名 / 删除 / 注销、
      视图读与删）与 **`IcebergTableView`**（`/iceberg-tables/...`：详细信息 / 快照 / 文件列表 /
      存储优化四个页签——前三个读一次 `loadTable` 的整份 metadata，
      文件列表走 catalog 级文件端点并由 `metadata.location` 减 warehouse 得到根；
      **存储优化页签挂的是与 Paimon 表同一个面板**，只把 `format="ICEBERG"` 传进去，
      参数键与默认值按 Iceberg 的 procedure 换一套，动作名与执行顺序不变）。
      **权限管理页也覆盖 Iceberg catalog**：「库」那一级显示为 Namespace，候选按层递归、
      多级用点号显示；授权仍走同一个端点，判定按「拼起来的路径」比较（见 `docs/authorization.md` §2.6）。
      Paimon 版表详情页在 Iceberg catalog 下
      仍不发请求、只给跳转。catalog 详情页的「文件列表」（仓库物理目录，与协议面无关）
      与「协议与能力」（读 `/v1/config` 的实际下发内容）一直可用。差异与理由见设计文档 §11.1 第 11 条。
      **表格式 v1 / v2 / v3 建表全支持**（控制台的 format-version 下拉三个值都有）；
      v3 的 `next-row-id` / `encryption-keys` 是透传，不做校验。

---

## 7. 测试

### 单元与集成测试（453 个用例）

```bash
JAVA_HOME=/path/to/jdk-21 mvn test
```

测试连的是内存 H2（`test` profile，见 `src/test/resources/application-test.yml`），
**不依赖本机是否有 MySQL**。

服务端（344 个）：

| 测试类 | 覆盖 |
| --- | --- |
| `PaimonRestCatalogApiTests` | 配置发现、建表与 schema 变更（加列 / 列改名 / 改类型 / 改可空性 / 改属性）/ 回滚、四种表格式建表（Paimon / Format / Object / Lance：非 Paimon 表补 `path`、Format 表禁主键、Object 表用固定六列覆盖用户字段、Lance 表保留主键、未知类型 400、`listTableDetails` 按 `tableType` 过滤）、catalog 级默认表属性（`table-default.*`：去前缀写入、表级参数优先、只对 Paimon 表生效、只在建表时合并、`type` 不接受默认）、快照提交与乐观并发、快照文件统计（由提交携带的 `statistics` 增量累计：跨提交叠加、未测量字段不进合计、没带统计的提交沿用上一个快照、缺基线时退回分区合计、最新快照缺统计时读路径兜底）、分区统计、表重命名（改名不动数据位置、跨库重命名、目标名被占用 409）、视图与函数、语义视图 1 MiB 上限、消费者位点、凭证下发与 403、各类 404 的 `resourceType` |
| `IcebergRestCatalogApiTests` | Iceberg 协议面 26 个端点的**行为**：`/v1/config` 的能力清单恰是 26 条且不含 `transactions/commit` / `plan` / `tasks` / `sign`；namespace 全套（列举 / 建 / 读 / 存在性 / properties 批量增删含 `missing` / 重名 409 / 空层级 400 / 多级 namespace 两种分隔符 / `?parent=` 只列直接子级 / **非空时删除 409**）；表全套（建表把 `metadata.json` 真的写进仓库且序号是 `00001-`、`format-version` 默认 2、服务端补 `created-at`、读回来与写下去**逐字节同一份**、`snapshots=all\|refs` 与非法取值 400、凭据不问不给 / 问了给 / `/credentials` 无条件给、`stage-create` 400 且表没建出来、`report-type` 必填）；提交（空 updates 不换位置、`assert-table-uuid` 放行且序号走到 `00002-`、对不上时 409 `CommitFailedException`、`identifier` 与路径不符 400、畸形 update 400）；重命名（**204**、只改标识不改位置、目标名被占用 409、报文残缺 400）；`register` / `unregister` / `drop`（外部表**永不清**、`unregister` 不碰仓库、`purgeRequested` 的作用范围——这三条只能落到文件系统上验）；视图全套（建 / 读 / 存在性 / 提交 / **204** 重命名 / 删除**不删元数据文件**）；跨面门禁（Iceberg 路径落在 Paimon catalog 上拿到嵌套形状且消息点出 `PAIMON catalog`） |
| `IcebergClientEndToEndTests` | 用 **Iceberg 官方 Java 客户端**（`org.apache.iceberg.rest.RESTCatalog`）走真 HTTP（随机端口 + JDK `HttpClient` 建 catalog），验三件 MockMvc 结构性看不见的事：① `/v1/config` 的 `endpoints` 与客户端自需端点**等值协商**（清单少了操作在本地就被拒、多了会真发出去拿到 404，两个方向 MockMvc 都发现不了）；② 嵌套错误体真的被翻成**具体**异常（`NoSuchTableException` / `NoSuchNamespaceException` / `AlreadyExistsException`，而不是退化成通用 `RESTException`）；③ 更新代数真跑通（客户端自己生成 `requirements` 与 `updates`，服务端解、校验、应用、落库，客户端再解析回元数据）。另外它钉住了两处**客户端环境**上的坑：裸 JVM 里默认 `io-impl`（`ResolvingFileIO`）装不上（需要 Hadoop），以及上游 `createNamespace` 对 `Map.of(...)` 会因 `containsKey(null)` 抛 NPE |
| `TableMetadataMaterializationTests` | 把 schema 与快照物化到 Paimon 表目录：建表写 `schema-0`、改表写下一个号、回滚把旧内容写到**新号**（回滚也是向前一步）、`register` 进来的外部表一个文件都不碰、缺 FileIO 实现时默认只记日志不打断请求（并断言打开 `fail-on-error` 后确实变成 500）；快照侧写 `snapshot/snapshot-<id>` 与 `LATEST`、落盘的是客户端**原文**（`properties` 这类规格没建模的字段不能丢）、`VERSION AS OF <数字>` 按**快照 id** 而不是 `Snapshot.version` 取值（含 `LATEST` / `EARLIEST` / 标签名）、快照回滚会删掉目标之后的快照文件；钉住「数据库 `schemaId` ↔ 仓库 `schema-<n>`」与「数据库 `snapshotId` ↔ 仓库 `snapshot-<n>`」逐号对应 |
| `ManagementApiTests` | 管理 API 的主体、角色、装配与授权链路；以及**格式分派**（`catalogFormat` 省略时用部署默认值、显式 ICEBERG 落库且能读回、认不出的取值 400 不让脏值进库、改已有 catalog 的格式 400 且消息说明不可变、原样带回则放行、`/v1/config` 的形状随格式变（Iceberg 带 `endpoints` 而 Paimon 不带）、两个方向的格式不匹配都给出**指名原因**的 404） |
| `PermissionManagementTests` | Paimon 原生权限端点（`/v1/{prefix}/permissions`）与直授判定：赋权三元组的增删查、官方词表的入参校验、撤销幂等、重复授予覆盖过期时间，以及直授真的能打通 catalog API 的权限判定（`user:` 与 `role:` 两种 principal 形式各一条链路）；**Iceberg 多级 namespace 的判权口径**（授 `accounting.tax` 命中 `["accounting","tax"]`、授上级覆盖后代、不反向覆盖、`sales` 不命中 `salesforce`）；与 `AuthorizationTests`（Polaris RBAC 链）互补 |
| `StorageConfigApiTests` | `storageConfigInfo` 六种存储类型的建 / 读 / 改往返、`AZURE` 缺 `tenantId` 与空位置的 400、换存储后新库位置随之改变、OBS↔OSS 换类型时端点一起替换 |
| `StorageConfigDtosTests` | 判别联合的绑定位形：子类型注册名与枚举一致、判别字段只出现一次、跨类型字段不串、落库路径（`Json`）往返、静态凭据字段随实体往返 |
| `StorageCredentialApiTests` | 按存储类型下发凭据的 HTTP 链路：S3 的密钥来源（默认配置与具名存储）与不下发 `endpointInternal` / `stsEndpoint`、`stsUnavailable` 时不给密钥、Azure 只给定位元数据、GCS 的 `lifespan` 收窄 `expiresAt`、OBS / OSS 各自走对键族且不串族、FILE 保留自包含令牌、未过期凭据被复用（比对 `expiresAt` 而非密钥） |
| `StorageCredentialResolutionTests` | 凭据解析与缓存的单元行为：具名存储优先且找不到时明确失败而非退回默认凭据、服务端专用字段不泄露、Azure 账户名只在已知端点后缀上解析、GCS `lifespan` 与 `ttl` 取小、OBS / OSS 的键名族与临时凭据令牌（含两家不同拼写）、两家的凭据互不可见、LRU 淘汰与过期失效、两个策略枚举的取值校验与错误信息；**catalog 静态凭据压过一切服务端来源、在 `stsUnavailable` 下仍然下发、OBS / OSS 各走自己的键族、密文解不开或不是密文时明确失败而非静默退回** |
| `StaticCredentialApiTests` | catalog 静态凭据的 HTTP 语义（配了加密密钥）：创建响应不回显密钥而库内是密文且能解回原值、凭据下发优先用 catalog 这一份、`PUT` 省略密钥表示保持、完全不带凭据字段也表示保持、提交一对空串即清除并退回服务端配置、只给密钥 / 换 ID 不带新密钥 / 空 ID 配非空密钥各自 400、与 `storageName` 互斥 400、OBS 与 OSS 同样支持、meta 报告 `staticCredentialsEnabled` |
| `StaticCredentialDisabledApiTests` | 未配 `credential-secret-key` 时的 fail-closed（`test` profile 里显式把该键置空——`application.yml` 那份是给人手工起实例用的）：保存静态凭据返回 400 且错误信息点明配置项与 `openssl rand -base64 32`、**不带凭据的 catalog 照常可建**（对照组，防「顺手把整个存储配置关掉」）、meta 报告能力已关闭 |
| `CredentialCipherTests` | 落库加解密单元行为：往返、同一明文两次密文不同（随机 IV）、空值保持空、未配密钥时拒绝加密、换密钥后解不开、密文被篡改时认证失败、明文当密文传入被拒、密文载荷畸形被拒、密钥不是 Base64 或解码后不是 32 字节时启动即失败、留空的密钥视为关闭 |
| `StoragePolicyApiTests` | `file-io.type=s3` 时拒绝 Azure / GCS / OBS / OSS catalog 并在报错里点明原因、接受 S3 与 FILE；`credential-manager.type=noop` 时凭据下发返回 501 |
| `AuthorizationTests` | 权限蕴含与判定的单元行为 |
| `CatalogEndpointAuthorizationTests` | 从运行时请求映射枚举全部 `/v1/{prefix}/**` 端点，逐一核对授权映射是否已登记——新增端点若忘记登记映射会让构建失败。枚举是**方法无关**的：Iceberg 面那三个显式登记的 `HEAD` 存在性检查端点一开始就把造请求的工厂顶爆了（`IllegalArgumentException: HEAD`），说明枚举确实覆盖了新协议面，而不是静默少测一批 |
| `ConsoleApiTests` | 控制台的托管与元数据：`/console` 重定向、目录式路径转发入口页、深链回退、缺失 assets 仍 404、已提交入口页引用的产物都存在、meta 的枚举与权限分组跟着规格走（含 `catalogFormats` 与服务端 `CatalogFormat` 枚举一致、`defaultCatalogFormat`）、登录引导同时如实返回 `authEnabled` 与 `consoleRequired`、门禁开着时控制台端点拒匿名而数据面仍开放（见第 9 节） |
| `ConsoleAuthEndpointTests` | 控制台登录在 HTTP 层的端到端：豁免端点可达而受保护端点拒绝匿名、**用户名密码登录成功/失败/缺参/限速与默认 `admin/admin`**、令牌签发与使用、错误密钥 401 与 `WWW-Authenticate`、**clientId 与用户名两种「不存在」的报文都与「密码不对」一字不差**、`invalid_scope` / `unsupported_grant_type`、Basic 与 JSON 体、失败限速、静态令牌映射、伪造 JWT 与畸形头。这一层才会暴露接线错误——排除列表写错、响应字段名写成驼峰、令牌端点自己反被鉴权挡住 |
| `CatalogFileBrowserTests` | 仓库文件浏览的服务语义：下钻一层、目录优先排序、冗余分隔符与 `.` 归一化、`..` 与绝对路径 / 带 scheme 拒绝、目录不存在 404、指向文件 400、未知 catalog 404、无 warehouse 400、超出上限标 `truncated`、关开关 501；表目录为根的三条（表级下钻、出不了表目录、未知表 404）；名称前缀过滤的四条（过滤与回显、过滤先于截断、只比本层条目名、含 `/` 拒 400，含表级过滤）；下载的三条（流里字节数与元数据一致、目录与仓库根 400、关开关 501） |
| `CatalogFileEndpointTests` | 四条端点的**接口形状**：URL、`path` / `prefix` 查询参数、状态码、响应字段名；下载钉 `Content-Disposition` 与 `Content-Length` 与实际字节一致；前缀过滤钉回显与 `total` 口径。与服务语义分开是因为这些错误各自独立——服务能把目录列对不代表端点拼对了，反过来同理 |
| `ConsoleEventTests` | 目录事件流（`GET /api/console/v1/events`）：表生命周期（建 / 改名 / 删）与授权变更（授 / 撤）都落成事件且 principal / requestId 来自请求上下文、属性带格式标识；**幂等撤销（未命中）不进事件流**（事件流里没有空操作）；增量游标契约——首页游标落在「现在」、带 `since` 只回更新的、`limit` 截断给 `hasMore`、catalog 过滤按 catalog 名（传库名拿到空页）；**类别过滤**（`?category=` 只回该类事件、大小写不敏感、未知取值 400 而不是空页） |
| `EventListenerSettingsTests` | 监听器订阅配置（`lakehouse.rest.event-listener.types` / `<name>.enabled-event-categories`）：不配 = 全订阅、`types` 只启用名单内的监听器、类别与类型同时配取并集、单配某一类不影响其他监听器；监听器名 / 类别名 / wire 值写错都在启动期抛错（配置错的后果是「该记的没记」，运行期发现通常已经丢了审计） |
| `ConsoleAuthMethodVisibilityTests` | 登录方式的可见性：**没开启的方式不出现在登录引导里**——关掉 `console.client-credentials.enabled` 就不下发 `client-credentials`，`auth.tokens` 为空就不下发 `static-token`，而默认开启的用户名密码照旧（对照组，防「无脑返回空列表」） |
| `AccessTokenServiceTests` | 访问令牌的签发与验证：claims、TTL 边界、换钥、篡改、换 issuer、无 `exp`、`alg:none`、签名密钥格式错必须启动失败、随机钥不共享 |
| `JwtTests` | 纯 JDK 的 JWT 编解码与验签：HS256 / RS256 / ES256 往返、**ES256 的原始签名转 DER**、`alg:none` 与未知算法、结构拒绝、`aud` 单值与数组 |
| `JwksTests` | JWKS 解析：RSA 与 EC 可用性（实测验签）、混合类型、不可用键跳过而非整份失败、私钥材料忽略、无 `kid` 与重复 `kid`、畸形文档 |
| `OidcServiceTests` | 用 JDK `HttpServer` 起假 IdP：发现文档与 JWKS 的缓存与刷新、**未知 `kid` 强制重取**、刷新失败沿用旧值、换钥、`audience`、时钟偏移、发现文档 issuer 不符则拒绝、IdP 不可达时不影响已缓存的验证 |
| `LoginAttemptLimiterTests` | 失败限速：阈值、窗口重置、桶相互独立、关闭、桶数上限与过期清理 |
| `AuditPrincipalTests` | 审计主体名归一化的单元行为：短名原样、空值记 `anonymous`、恰好 255 字符仍原样、超长记 `sha256:<前 12 位>`（确定性、幂等、**结果里不含原文任何片段**，也**不是截断**），以及实体基类写 `owner` / `createdBy` / `updatedBy` 时一定不超列宽 |
| `AuditPrincipalEndpointTests` | 审计主体名走完整 HTTP 链路（拦截器 → 主体名 → 实体 → JDBC）：门禁模式下 272 字符的未知令牌**不再把建表打成 500** 而是记摘要、`Bearer alice` 仍以 `alice` 入库（本地调试约定不退）、服务端自己签发的令牌解析出真实主体名、匿名记 `anonymous` |
| `MysqlDdlGeneratorTests` | 由实体元数据生成 MySQL DDL，并断言方言被钉在 MySQL 8.0（见「代码生成」） |
| `PaimonRestServerApplicationTests` | 上下文加载 |

Spark 子模块（107 个，其中 6 个类共 35 个用例需要显式指向服务端）：

> `example/` 下的 `PaimonS3Test` **当前跑不过**，与 S3 环境无关：它在加载 Spark
> catalog 时被 Paimon 的 `requiredSparkConfsCheck` 挡下（会话里没有
> `spark.sql.extensions`），报错发生在任何 REST 调用之前。因此 `mvn test` 会停在
> Spark 模块的 BUILD FAILURE，而服务端模块（344 个）是绿的。

| 测试类 | 覆盖 |
| --- | --- |
| `ManagementSqlParsingTests` | 16 条语句的解析结果、八种资源定位器的字段拆分、多 access 展开、列范围白 / 黑名单、`UNTIL` 日期换算、反引号与注释、非管理语句必须交回原生解析器，以及 catalog role 的 7 条语句**必须交回原生解析器**（删掉的东西不许悄悄回来） |
| `ManagementApiClientTests` | 请求方法与路径、请求体字段形状、路径段编码、`ALTER` 的读-合并-回写、单资源裸对象与状态码、权限端点的基址推导与分页跟随、错误映射 |
| `ManagementSqlExecutionTests` | 真实 `SparkSession` + 桩服务端：扩展是否真被加载、`spark.sql` 是否真执行命令、结果行列名、原生 SQL 不受影响 |
| `ManagementSqlLiveServerTests` | 对真实服务端跑完整 SQL 链路：管理 API 契约、官方权限端点的 grant / list / revoke 与分页过滤（默认跳过，见下）。catalog role 的建档与装配已从语法移除，这一类用例里那半截脚手架改调 `ManagementApiClient`，于是顺带守住「管理 API 在 SQL 撤出之后仍然整条可用」 |
| `PaimonTableDdlTests` | 用 Spark SQL 经 LakeHouse Catalog 建表再写入：分区 append 表与主键表（含分区主键）、`LIKE`、`IF NOT EXISTS` 幂等与裸建冲突、内联主键约束与保留表属性被 Spark 拒绝、库不存在时报错，以及 `CTAS` 与分区主键表 `INSERT` 写完后读回数据；两种断言并重——`DESCRIBE` / `SHOW CREATE TABLE` 的输出，以及直接读服务端元数据核对注释、分区键、主键与选项（默认跳过，见下） |
| `NonPaimonTableSqlTests` | Format / Object / Lance 三种非 Paimon 表的能力边界：Format 表（csv / parquet）建表-写入-读回全链路、Object 表固定六列 + 「把对象放进表目录即可查到，无需 refresh」+ 「客户端给的 `path` 成为表位置，于是能索引一个既有对象目录（并按外部表登记、目录里不留 `schema-0`）」、Lance 表只有建表可行——读写在 Spark 分析阶段被拒；服务端侧同时核对 `type` / `path` / `isExternal` / 字段的落库形状（默认跳过，见下） |
| `SparkSqlAuthorizationTests` | **两种格式各两条**。Paimon 面：同一个 catalog、同一张表，两个身份各跑一遍真 SQL——有写权限的那个能建库、建表、写入、读回；只读的那个读得到数据、也看得见表列表，但建库 / 建表 / 写数据一律被服务端授权判定拒绝，且断言拒绝报文点名了主体与**缺失的那一项权限**（`TABLE_CREATE` / `TABLE_WRITE_DATA` / `NAMESPACE_CREATE`）、被拒之后数据没变。Iceberg 面（`icebergCatalog.*`）：同一批主体、另一套 catalog role（catalog role 是 catalog 内的实体，跨格式借不到），语句换成 `CREATE NAMESPACE` / `USING iceberg`，并钉住一条只从那一侧看得见的差异——写数据要 `UPDATE` + `ALTER`（指标上报判 `TABLE_WRITE_DATA`、提交端点判 `TABLE_WRITE_PROPERTIES`）。角色的授权用官方权限语句装配（`ON CATALOG_ALL ... TO ROLE ...`，而 `role:` 要生效得先有同名 catalog role——这一层用 `ManagementApiClient` 建，顺带验证「管理 API 建角色 + SQL 授 `role:`」这条跨接口的组合），于是也顺带验证「`ROLE x` 折成 `role:x`」这一步（默认跳过，见下）。服务端已有的两层授权测试都走 MockMvc 直接打 REST，这一层验的是**引擎发出的请求**——403 会不会被客户端改写、拒绝后到底有没有落数据，只有真 SQL 才知道 |
| `IcebergTableDdlTests` | 用 Spark SQL 经 **Iceberg 协议面**（另一个 catalog，`type=rest`）建表：namespace 与 `CREATE DATABASE` 同义、分区表（`PARTITIONED BY` 的 transform 落成 `partition-specs[].transform`）、`INSERT` 之后的快照与 `summary`、更新代数改 schema（`current-schema-id` 前进、历史 schema 保留）、重命名、非空 namespace 不可删，以及 CTAS 的边界——Spark 把它翻成 staged create，缺 `transactions/commit` 时被服务端**指名拒绝**。断言同样两层：`DESCRIBE` / `SHOW CREATE TABLE`，以及服务端 `metadata` 里的 `schemas` / `partition-specs` / `properties` / `snapshots`（默认跳过，见下）。catalog 由 `ensureIcebergCatalog()` 经管理 API 预先建成 `ICEBERG`——让客户端撞 `/v1/config` 的自动登记会按部署默认值建成 Paimon |
| `SparkSqlDocExamplesTests` | 抽出 `docs/spark-sql-reference.md` 第 10 节的示例并逐条执行，断言作用范围落到哪几列、列范围与有效期的回读、撤销一项 access 不影响同资源其它 access（默认跳过，见下） |
| `PaimonRestCatalogTest` | 对象存储仓库的凭据链路：建表后服务端返回的 `path` 由 warehouse 模板展开、`INSERT` 写入分区主键表并逐列读回（默认跳过，见下）。它同时压住「类路径缺 `s3://` FileIO 实现」与「凭据没按引擎认的键名下发」这两种失败 |
| `PaimonRestManagementTests` | 配置解析的容错 |
| `PaimonS3Test` | `example` 包里的示例链路。**当前失败**，失败点在 Spark 会话的配置检查（缺 `spark.sql.extensions`），不在它要验的逻辑上 |

### 端到端验收脚本

```bash
# 需先有一个服务端实例；不指定 profile 时连 MySQL
# （想用内存库就在启动命令上加 --spring.profiles.active=h2）
java -jar lakehouse-rest-spring-parent/lakehouse-rest-server/target/lakehouse-rest-server-0.0.1-SNAPSHOT.jar &

# Catalog API：覆盖规格中全部 60 个 operation
# 脚本会创建并清理 database sales，因此要求目标实例为初始状态
BASE=http://127.0.0.1:8080 ./scripts/api-sweep.sh

# Management API：覆盖全部扩展端点与 3 个权限端点
BASE=http://127.0.0.1:8080 ./scripts/management-sweep.sh

# Iceberg 协议面：不需要服务端实例——它是静态三方比对
# （规格 35 条 ↔ 声明的能力清单 30 条 ↔ 控制器映射），16 项断言
./scripts/verify-iceberg-endpoints.py

# Spark SQL：先校验参考文档，再自动起服务端（用 h2 profile，并配好令牌
# root / limited / alice / bob）、跑 ManagementSqlLiveServerTests +
# PaimonTableDdlTests + NonPaimonTableSqlTests + IcebergTableDdlTests +
# SparkSqlAuthorizationTests + SparkSqlDocExamplesTests、收尾停服务端
./scripts/e2e-spark-sql.sh

# 控制台登录（HTTP 层）：登录引导、用户名密码登录、令牌端点的错误码、凭据校验、
# 签发令牌、静态令牌、静态资源深链——63 项。需以 --lakehouse.rest.auth.enabled=true 启动，
# 凭据取自启动日志里「created bootstrap principal」那行（仅在开了授权时才有；
# 没开时先用默认账号密码登录、再调管理 API 建一个主体，见 docs/console-auth.md §11）。
# 第 1 节断言「登记了静态令牌，登录页才会有这个页签」，因此实例要一并配
# --lakehouse.rest.auth.tokens[0]，否则那几条会如实报出「没出现」
BASE=http://127.0.0.1:8080 \
CLIENT_ID=<引导主体 clientId> CLIENT_SECRET=<明文密钥> \
STATIC_TOKEN=<需与启动参数 lakehouse.rest.auth.tokens[0] 一致，否则脚本会断言该方式不出现> \
  ./scripts/sweep-console-auth.sh

# 前端登录逻辑：直接跑 src/store/auth.js 与 src/api/* 的真实代码——59 项
# 用上面那个服务端实例即可
cd lakehouse-rest-console
BASE=http://127.0.0.1:8080 \
CLIENT_ID=<引导主体 clientId> CLIENT_SECRET=<明文密钥> \
  npm run check:login
```

`api-sweep.sh` 与 `management-sweep.sh` 每行输出
`<标记>[实际状态码/期望状态码] 说明 响应片段`，末尾汇总通过 / 失败项数，
存在失败时以非 0 退出；请求体形状与规格字段名一致，可直接作为接口调用示例。

`e2e-spark-sql.sh` 是唯一会启动服务端的脚本，也是验证「客户端与服务端契约一致」的那一层：
前几层测试用的是桩，只能证明客户端与自己的假设自洽。它一次跑六个类——
`ManagementSqlLiveServerTests`（管理 API 契约）、`PaimonTableDdlTests`（用 Spark SQL 建 Paimon 表）、
`NonPaimonTableSqlTests`（Format / Object / Lance 三种非 Paimon 表的读写边界）、
`IcebergTableDdlTests`（用 Spark SQL 建 Iceberg 表，走 Iceberg 协议面）、
`SparkSqlAuthorizationTests`（两种身份跑真 SQL）、`SparkSqlDocExamplesTests`（参考文档示例）。
六者**必须同批运行**：一个 JVM 只能有一个 SparkContext，而 `spark.sql.extensions` 只在建会话时生效，
因此它们共用同一个会话（会话里同时注册了 Paimon 与 Iceberg 两个 catalog）；
把用桩的 `ManagementSqlExecutionTests` 拉进同一批会让端点与扩展错位，
`LiveSparkSession` 会就此直接报错，而不是静默跑错。

`sweep-console-auth.sh` 与 `npm run check:login` 是登录链路的另外两层，都对着运行中的实例跑：

- `sweep-console-auth.sh` 发**真实 HTTP 请求**，断言的是协议层——豁免端点可达而受保护端点
  拒绝匿名、哪种组合下控制台要登录、每种错误对应哪个 `error` 码、clientId 不存在与密钥不对
  的报文是否一字不差、用户名不存在与密码不对是否同样一字不差、失败是否被限速、
  静态令牌是否映射到主体。它在意的故障是「接线错误」：
  拦截器排除列表写错、令牌端点自己反被鉴权挡住、SPA 深链回退漏了 `/console/auth/callback`。
- `npm run check:login` 用 vite 的 `ssr` 构建把 `src/store/auth.js` 与 `src/api/*` **原样**打成
  Node 可执行产物（不是另写一份仿真），装好 `localStorage` / `sessionStorage` 替身，
  包住 `fetch` 记录前端发出的每个请求，再断言请求体形状（用户名密码那条是 JSON、
  客户端凭据那条是表单）、令牌落盘的 key、`Authorization` 的附加、登出、失败回滚。
  它证明的是**前端发出的请求形状与登录态流转**——
  服务端测试看不到这一层，`adopt()` 失败不回滚那个 bug（会把正在用的有效令牌一起弄丢）
  就是它抓出来的，而当时服务端 209 个用例与静态校验全绿。

两者都要 `BASE` + `CLIENT_ID` + `CLIENT_SECRET`，缺了会以退出码 2 明确拒绝而不是跑出一串假失败。
用户名密码那一段默认用 `admin/admin`，改过配置的部署用 `CONSOLE_USER` / `CONSOLE_PASSWORD`
覆盖；**一分钟内连跑超过 5 次**会被服务端自己的失败限速拦下（那不是回归）。

### 代码生成与文档校验

规格或实体变更后重新生成派生产物：

```bash
python3 scripts/gen-management-contract.py   # docs/management-api-contract.md
python3 scripts/gen-management-privileges.py # dto/Privilege.java

# 生成后校验：反解文档表格，与规格逐行比对
python3 scripts/verify-management-contract.py

# Spark SQL 参考文档：比对语法文件、规格枚举、客户端代码
python3 scripts/verify-spark-sql-doc.py

# MySQL 建表语句（改实体后必须重跑，否则启动时 validate 会失败）
./scripts/gen-mysql-ddl.sh                   # sql/schema-mysql.sql

# 控制台：构建产物落位 + 与服务端规格逐条比对端点
./scripts/build-console.sh                   # 需要 Node 20+，见第 9 节
python3 scripts/verify-console.py            # 只校验，不构建（多解释器时用 PYTHON=... 指定）
```

这几个 Python 脚本都要解析 OpenAPI 规格，因此需要 PyYAML：

```bash
python3 -m pip install --user PyYAML
```

`gen-mysql-ddl.sh` 内部跑 `MysqlDdlGeneratorTests`：DDL 由 Hibernate 依实体元数据生成，
**不手工维护**——22 张表、21 个唯一约束、23 个索引，手工维护必然漂移。生成器连的是 H2
但方言被钉在 MySQL 8.0（`MySql8DialectResolver`），因此生成过程不需要 MySQL，
产出则已用真实 MySQL 8.0.46 验证过可直接执行。`DB_NAME=...` 可改建库语句里的库名。
Iceberg 协议面落地的 9 个新列也由它产出（`catalog_format` 是
`varchar(32) default 'PAIMON' not null`），**改实体后必须重跑**——
`ddl-auto: validate` 会在启动时对不上就拒绝启动。

`verify-iceberg-endpoints.py` **不依赖 PyYAML**：它只需要规格里「路径 / 方法」两层
（indent 2 / indent 4），所以自写了一个缩进解析器，而不是为一条校验引入一个部署前提。
它做的三方比对是「规格 35 条 ↔ `IcebergEndpoints.SUPPORTED` 30 条 ↔ 控制器映射」，
并且把「5 个不声明」写成**字面量**——从「规格 − 声明」推出来的清单永远自洽，
就永远发现不了漏实现。派生自规格而不是照抄文档，是因为 `plan` 有三个方法、
`tasks` 是 `POST`，这两处照记忆写必然错。

`verify-management-contract.py` 刻意不复用生成器的任何函数——它把 Markdown 表格反解回结构化
数据再独立比对，因此能发现生成器自身的推导错误（两者共用代码时错误会互相掩盖）。
校验覆盖 §1 端点清单、§4.1 成功响应形状、§4.4 成功码分布与 §4.5 错误码计数；
生成器另有一组断言，规格结构变化时会直接失败，而不是写出一份错位的基线。

---

## 8. 容器与 Kubernetes 部署

### 8.1 镜像

```bash
# 1. 先产出 jar —— 镜像里没有 JDK 与 Maven，构建镜像不编译
mvn -o -pl :lakehouse-rest-server -am clean package -DskipTests

# 2. 再打镜像
docker build -t lakehouse-rest-server:0.0.1 .
```

单阶段：基础镜像是 `eclipse-temurin:17-jre-noble`，`Dockerfile` 只做三件事——
复制上面那份 jar、复制 `sql/schema-mysql.sql`、建一个非 root 用户。
**运行镜像钉 17，不要升到 18 及以上**——理由见第 2 节开头（S3 物化的 DNS 解析）。
jar 是 17 编的还是 21 编的都不影响：根 POM 钉了 `maven.compiler.release=17`，
字节码始终是 17 的，构建期与运行期的 JDK 在这里是解耦的。

**为什么不把编译放进镜像**：编译要 JDK、Maven 与约 300MB 依赖，而这些只在构建时
用一次，运行一个都不需要。挪出去之后 `docker build` 只剩复制文件，构建机器也不必
为镜像单独养一份 Maven 依赖缓存；更关键的一点是**镜像里跑的就是你本地跑过的那个
jar**（同一份字节），而不是镜像内按同一份源码又编一遍的另一份产物——后者只要有一处
环境差异，就变成「测过的」与「部署的」不是一回事。代价是工件必须先存在：忘了第 1 步，
`docker build` 会在 `COPY` 处直接报找不到文件（`.dockerignore` 只放行
`lakehouse-rest-spring-parent/lakehouse-rest-server/target/*.jar`）。

运行时以 uid 10001 非 root 运行；`ENTRYPOINT` 用 exec 形式，让 SIGTERM 直达 JVM，
配合 Spring Boot 的优雅停机。

镜像里放两样东西：jar，以及 `sql/schema-mysql.sql`。后者是给 K8s 的 initContainer
用的——它把 DDL 投递给 MySQL 做首次初始化（见 8.2）。两样东西取自同一个仓库状态，
因此 DDL 与 jar 里的实体定义天然同版本。

构建时踩到的一个坑已经落进 Dockerfile：

| 现象 | 原因 | 处理 |
| --- | --- | --- |
| 容器内 `Permission denied`，报错指向 `/app/sql/schema-mysql.sql` | `COPY --chmod=0644` 会把权限也套到 Docker 自动创建的中间目录上，`/app/sql` 变成 `drw-r--r--`；目录没有 x 位就无法遍历，里面文件什么权限都读不到 | 先 `RUN mkdir -p /app/sql && chmod 0755`，再单独 `COPY` 文件 |

另有一条同源的经验搬到了宿主机侧：某些网络环境下 Maven Central 会对特定出口 IP
返回 403（`Requests from open proxy and relay services are blocked`），而本机 mvn
正常——现在第 1 步在宿主机上跑，在 `~/.m2/settings.xml` 里配一个 mirror 即可
（原先它是镜像构建的坑，靠 `--build-arg MAVEN_MIRROR_URL=...` 绕开，现已随构建阶段移除）。

#### 多架构镜像

`docker build` 只能产出**当前机器架构**的镜像。要同时提供 x86 与 ARM（两者都有真实
部署场景：x86 服务器、Apple Silicon 开发机、ARM 云主机），走 `buildx`：

```bash
./scripts/build-image.sh                                    # 双平台，装进本机镜像存储
OCI=/tmp/lakehouse-rest-server-multiarch.tar ./scripts/build-image.sh   # 导出 OCI 归档
PLATFORMS=linux/amd64 ./scripts/build-image.sh              # 退回单平台
# 要有别的机器能用，只能推仓库（IMAGE 需带仓库地址）
PUSH=1 IMAGE=registry.example.com/paimon-rest/lakehouse-rest-server:0.0.1 ./scripts/build-image.sh
```

脚本只是把几条容易记错的约束固定下来，参数都是环境变量（`IMAGE` / `PLATFORMS` /
`PUSH` / `OCI` / `BUILDER` / `EXTRA`，见脚本头部注释）。三条实际会踩的：

1. **多平台不能用传统引擎的 `--load`。** 多平台产物的顶层是一个 manifest list，
   传统 graph driver 的镜像存储放不下（报 `docker exporter does not currently
   support exporting manifest lists`）。Docker Desktop 默认启用的 containerd 存储
   可以，判据是 `docker info --format '{{.Driver}}'` 输出 `overlayfs`（传统驱动是
   `overlay2`）。不支持时用 `OCI=` 导出 tar，或 `PUSH=1`。
2. **只有 `PUSH=1` 才能让别的机器拿到多平台镜像。** 装进本机镜像存储的 tag 只在这台
   机器上有效；异构集群的各节点要各自拉取自己架构的那一份，必须有一个能存 manifest
   list 的 registry。
3. **跨架构构建靠 QEMU，慢但不影响产物。** 本机（arm64）实测：amd64 那份从启动到
   健康检查通过约 85 秒，arm64 原生约 20 秒，差距主要在 `RUN apt-get install curl`
   这类步骤上。

**多架构不需要跑两次 Maven。** jar 是架构无关的字节码，`Dockerfile` 又只装不编译，
两个平台吃的是同一个 jar。这一点可以直接验证——把两个平台镜像里的 `/app/app.jar`
解出来算 sha256，都与本地那份一致：

| 平台 | `/app/app.jar` sha256（前 16 位） | 与本地 jar |
| --- | --- | --- |
| linux/amd64 | `1bcf5cdbb6cf324a` | 一致 |
| linux/arm64 | `1bcf5cdbb6cf324a` | 一致 |

两个平台镜像的 config 逐项相同（`User` 10001:10001、`Entrypoint`、`WorkingDir`、
`ExposedPorts`、`HEALTHCHECK`、`JAVA_TOOL_OPTIONS`），运行时 JDK 都是 17.0.20.1。

**体积成本**：多平台镜像在仓库里约等于两倍体积。两平台的基础镜像层天然不同；jar 层
内容虽然相同却**无法去重**——层 tar 里新建目录条目的时间戳取的是各平台的打包时刻，
两次打包跨秒时 digest 就不同（实测两层 tar 只差 4 个字节，全在 header 的时间戳字段）。
只需一种架构时用 `PLATFORMS=` 指定，别无谓地翻倍。

**若 buildx 报 `Bad Gateway` / `failed to authorize`**：daemon 的 `registry-mirrors`
只对 daemon 生效，docker-container 驱动的 buildkit **不继承**它，会直连
`registry-1.docker.io` 与 `auth.docker.io`；于是 `docker pull` 正常而 `buildx build`
失败。给 builder 单独配一份镜像源即可（模板见 `scripts/buildkitd.toml`）：

```bash
docker buildx create --name mirrorb --driver docker-container \
  --config scripts/buildkitd.toml --bootstrap
BUILDER=mirrorb ./scripts/build-image.sh
```

### 8.2 Kubernetes

`deploy/kubernetes/` 是一套用 kustomize 组装的清单：

```bash
kubectl -n paimon-rest create secret generic paimon-rest-credentials \
  --from-literal=DB_PASSWORD=... --from-literal=REST_TOKEN=...
kubectl apply -k deploy/kubernetes
```

包含服务端 Deployment、MySQL StatefulSet、warehouse 的 PVC、配置与凭据、
Service / Ingress / PDB。完整说明在其目录下的 `README.md`，三条比较关键的取舍：

- **副本数固定为 1**：warehouse 用 `file://` 加 ReadWriteOnce 卷，多副本会各挂一份
  不同的数据。要横向扩展需要先把仓库换成对象存储（服务端已支持 S3 / Azure Blob / GCS）。
- **探针用 exec + curl 而不是 httpGet**：`httpGet` 只把 200–399 视为成功，
  而开启鉴权后 `/v1/config` 无令牌返回 401，会让 Pod 永远不 Ready——
  表现是「容器在跑、日志正常，但 Service 没有后端」。
- **建表语句走镜像而不是 ConfigMap**：kustomize 不允许引用 kustomization 目录之外的
  文件，而把 DDL 复制进 `deploy/` 必然漂移。代价是改完 DDL 必须重新构建镜像。

清单的内部一致性有脚本检查，不需要集群：

```bash
python3 scripts/verify-k8s-manifests.py
```

它核对的是跨文件引用——selector 能否选中 Pod、卷名与卷定义是否对得上、
`secretKeyRef` 的 key 是否存在、**配置里的 `${...}` 是否都有对应环境变量**、
探针端口与 containerPort 是否一致、清单引用的镜像是否都在 Dockerfile 里有构建命令。
这些错误 `kubectl apply` 时都不会报，只在运行时表现成 Pod 一直 Pending
或启动时报「解析不了占位符」。

### 8.3 可运行的端到端示例

> 早期仓库里有一个 `examples/spark-paimon-rest/` 示例目录，已在提交 `de5476c`
> （「delete example dir」）中删除；下面的脚本是它的等价替代，且不需要单独维护一份 pom。

`scripts/e2e-spark-sql.sh` 能直接跑通「Spark SQL → 本服务端 → 建 Paimon 表」：
它自动起一个 h2 profile 的服务端实例，把服务端地址与令牌传给测试类，跑完自动停。

```bash
mvn -o install -DskipTests        # 只需一次（-am 会带上 core / storage / protocol-paimon）
./scripts/e2e-spark-sql.sh        # 默认端口 18080；PORT= / KEEP=1 见脚本头部注释
```

不需要预先安装 Spark 发行版——classpath 由本仓库的 Maven 依赖提供。
它同时是第 6 节验证阶梯里「客户端与服务端的**实际**契约」那一层：
用桩的 `ManagementSqlExecutionTests` 只能证明客户端与自己的假设自洽。
要在自己的 Spark 集群上手工执行，用同目录的 `spark-defaults.conf`，
SQL 与报错对照见 [`spark-paimon-rest-e2e.md`](docs/spark-paimon-rest-e2e.md)。

---

## 9. Web 管理控制台

服务端自带一个 Vue 单页应用，挂在 `/console/` 下，覆盖 Catalog API 与 Management API 两个面：

```
http://localhost:8080/console/
```

| 路由 | 页面 |
| --- | --- |
| `/login`、`/auth/callback` | 登录与 SSO 回调 |
| `/` | 概览：统计块、服务端配置、**连接自检**、catalog 清单、`GET /v1/config` |
| `/browse` | 目录浏览：库/表/视图/函数/语义视图；建库建表、注册表、按表 ID 定位、重命名、删除。表列表六列——表名 / 表格式 / 表类型（Managed 或外部表）/ 创建时间 / 元数据更新时间 / 操作，数据取自 `table-details`（只回表名的 `/tables` 给不出这几列） |
| `/tables/:prefix/:database/:table` | [表详情](docs/console-table-detail.md)：页签随表格式伸缩——Paimon 表六个（详细信息含字段列表 / 分区列表、**文件列表**、快照、标签、分支、数据访问），Format / Object / Lance 表只有详细信息与**文件列表**，且不向快照端点发请求；三种表都展示字段列表（Object 表是 Paimon 固定的六列，主键 / 分区字段两列不渲染）。**改表结构不在控制台做**：`alter` 端点仍在，走 HTTP 或 Spark SQL |
| `/catalogs` | Catalog 列表：创建、编辑（带版本）、删除；名称进详情页 |
| `/catalogs/:catalogName` | [Catalog 详情](docs/console-catalog-detail.md)：概览 / **文件列表**（仓库物理目录，目录名可点下钻、文件可下载、文件名前缀过滤 + 本地分页）/ **配置**（编辑新建 Paimon 表的默认参数 `table-default.*`，其余属性只读回填） |
| `/principals`、`/principal-roles` | 治理：主体、角色；角色页含「授予 / 撤销 catalog 角色」。**catalog 角色与它的资源授权没有页面**——这两件事的入口是管理 API 与 Spark SQL |
| `/permissions` | 权限管理：控制台**唯一**的授权页（Paimon 官方权限模型、授权直接挂在主体上），覆盖官方八种资源定位器里的四级——catalog / database / table / view |
| `/settings` | 连接设置：API 基址、访问令牌、登录状态、主题 |

三条约束值得先知道：

- **它是运维工具，不是写入入口。** 不提供 `commitTable`（控制台拼不出一个指向真实文件的快照）；
  对表的改动只有回滚与删除——改表结构要走 HTTP 或 Spark SQL（控制台的「变更」页签已撤掉），
  表级授权不在表详情页做，统一到「权限管理」页。
- **构建产物提交在仓库里。** 产物落在 `lakehouse-rest-spring-parent/lakehouse-rest-server/src/main/resources/static/console`，
  因此构建服务端 jar 不需要 Node；代价是改了前端必须重建并提交产物，
  用 `./scripts/build-console.sh` 一条命令完成构建与校验。
- **路径不靠人工比对。** 全部端点收在 `lakehouse-rest-console/src/api/endpoints.js` 一张表里，
  由 `scripts/verify-console.py` 与三份 OpenAPI 规格（Paimon / Iceberg / 管理 API）机械比对
  （16 组 72 项：端点存在性、引用完整性、五处基址一致、产物新鲜度、对话框状态、下拉候选来源、
  静态凭据字段与服务端的一致性、两种格式的优化参数键、**catalog 表格式**、**Iceberg 目录浏览的契约形状**、
  **存储字段分层**、**事件页的增量契约与类别筛选**，最后由一组「文档计数」盯住这个数字本身与脚本一致）；
  服务端侧 `ConsoleApiTests` 守住静态资源托管与 SPA 深链回退。
- **表格式（Paimon / Iceberg）在创建 Catalog 时就选定，之后不可改。** 新建弹窗里用
  **选项卡片**而不是下拉：每个选项要能读出「客户端走哪段路径」与一句话影响面；
  清单页有格式徽标与筛选；catalog 详情页的「协议与能力」把**服务端实际下发的**
  端点清单摆出来（Iceberg 侧读 `GET /v1/config` 的 `endpoints` 原文，前端不抄一份）。
  目录浏览与表详情按格式换实现：Paimon catalog 走 `databases/**` 的浏览页与表详情页，
  Iceberg catalog 走 `IcebergBrowseView`（`namespaces/**`：命名空间平铺、建表/登记/改名/删除/注销、
  视图读与删）与 `IcebergTableView`（详细信息 / 快照 / 文件列表 / 存储优化四个页签）。
  Paimon 版表详情页在 Iceberg catalog 下不发请求、只给跳转。

### 9.1 登录与鉴权

两个开关管两件不同的事：`lakehouse.rest.auth.console.required`（默认 `true`）只作用于控制台界面
与 `/api/console/v1/**`；`lakehouse.rest.auth.enabled`（默认 `false`）管 `/v1/**`、
`/api/catalog/v1/**`、`/api/management/v1/**` 是否要带令牌。

**默认部署是「要求登录但数据面敞开」**：浏览器被拦在登录页，而 `curl /v1/config` 返回 200。
这层门禁只避免「误入的人看到一堆管理表单」，**不是安全边界**——要保护数据必须开 `auth.enabled`。
浏览器登录支持用户名密码（默认 `admin/admin`，不需要先建主体）、OAuth 客户端凭据、
OIDC 授权码 + PKCE 三种方式；令牌是自包含 JWT，多实例互认但**无法即时撤销**。
完整设计见 [`docs/console-auth.md`](docs/console-auth.md)，三层测试（31 / 63 / 59）用法见第 7 节。

### 9.2 文档

| 文档 | 内容 |
| --- | --- |
| [`docs/console.md`](docs/console.md) | 控制台总览：目录结构、服务端如何托管、页面清单、端点契约表与机械校验、构建与提交约定、测试分层 |
| [`docs/console-table-detail.md`](docs/console-table-detail.md) | 表详情页：页签随表格式（Paimon / Format / Object / Lance）伸缩、详细信息含字段/分区列表、表目录文件列表、为什么授权不在这页、破坏性操作、已知边界 |
| [`docs/console-catalog-detail.md`](docs/console-catalog-detail.md) | Catalog 详情页：概览与文件列表、下钻与路径防护、为什么只读、「配置」页的默认表属性（`table-default.*`）编辑与仍未做的三项 |
| [`docs/console-auth.md`](docs/console-auth.md) | 登录与鉴权：两个开关的边界、三种登录方式与令牌端点、错误码、安全考量、已知边界 |
