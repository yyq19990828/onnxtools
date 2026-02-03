# Polygraphy 懒加载机制详解

## 概述

懒加载（Lazy Loading）是 Polygraphy 的核心设计模式，它将**对象创建**和**实际执行**分离，实现了延迟执行和智能资源管理。本文档深入解析懒加载的实现原理、使用场景和最佳实践。

## 什么是懒加载？

### 传统立即执行模式
```python
# 传统方式：创建时立即执行所有工作
def load_model_immediately(path):
    file_content = read_file(path)        # 立即读取文件
    parsed_model = parse_onnx(file_content)  # 立即解析ONNX
    trt_network = convert_to_trt(parsed_model)  # 立即转换
    return trt_network  # 返回最终结果

model = load_model_immediately("model.onnx")  # 所有工作在这里完成
```

### Polygraphy 懒加载模式
```python
# Polygraphy方式：创建时只准备，调用时才执行
loader = NetworkFromOnnxPath("model.onnx")  # 只存储路径，不执行任何工作
# ... 可能进行其他配置 ...
builder, network, parser = loader()  # 现在才执行所有工作
```

## 懒加载的实现原理

### 1. 核心设计模式：函数对象（Callable Object）

```python
class LazyLoader:
    """懒加载器的基本概念"""
    def __init__(self, *args, **kwargs):
        # 只存储参数，不执行实际工作
        self.args = args
        self.kwargs = kwargs
        self.executed = False
        self.result = None

    def __call__(self):
        # 调用时才执行实际工作
        if not self.executed:
            self.result = self._do_actual_work(*self.args, **self.kwargs)
            self.executed = True
        return self.result

    def _do_actual_work(self, *args, **kwargs):
        # 子类实现具体的工作逻辑
        raise NotImplementedError
```

### 2. NetworkFromOnnxPath 实现分析

#### 类层次结构
```
NetworkFromOnnxPath         # 具体实现：ONNX文件解析
  ↓ 继承自
BaseNetworkFromOnnx        # 中间层：ONNX网络处理通用逻辑
  ↓ 继承自  
BaseLoader                 # 基类：定义懒加载协议
```

#### 三个关键组件

##### 组件1：延迟存储（`__init__`）
```python
def __init__(self, path, flags=None, plugin_instancenorm=None, strongly_typed=None):
    """只存储参数，不执行任何实际工作"""
    super().__init__(flags=flags, plugin_instancenorm=plugin_instancenorm, strongly_typed=strongly_typed)
    self.path = path  # 仅保存路径字符串

    # 注意：此时没有进行以下操作：
    # ❌ 文件存在性检查
    # ❌ ONNX文件读取
    # ❌ 模型解析
    # ❌ TensorRT对象创建
    # ❌ GPU内存分配
```

##### 组件2：可调用协议（`__call__`）
```python
# BaseLoader 提供统一的调用接口
@func.constantmethod  # 装饰器确保方法行为一致
def __call__(self, *args, **kwargs):
    """懒加载的统一入口点"""
    return self.call_impl(*args, **kwargs)  # 委托给具体实现
```

##### 组件3：实际执行（`call_impl`）
```python
@util.check_called_by("__call__")  # 装饰器确保只能通过 __call__ 调用
def call_impl(self):
    """这里才真正执行所有工作"""

    # 步骤1：智能路径解析（支持嵌套懒加载）
    path = util.invoke_if_callable(self.path)[0]

    # 步骤2：创建TensorRT基础对象（builder, network, parser）
    builder, network, parser = super().call_impl()

    # 步骤3：实际文件I/O和解析（耗时操作在这里！）
    success = parser.parse_from_file(path)
    trt_util.check_onnx_parser_errors(parser, success)

    # 步骤4：返回实际的TensorRT对象
    return builder, network, parser
```

### 3. 智能对象管理：`util.invoke_if_callable`

这个工具函数是懒加载系统的核心，实现了级联懒加载：

```python
def invoke_if_callable(obj):
    """智能调用：如果是可调用对象则调用，否则直接返回"""
    if callable(obj):
        return obj()  # 递归懒加载
    else:
        return obj    # 直接返回值
```

#### 应用示例：
```python
# 场景1：传统字符串路径
loader = NetworkFromOnnxPath("/path/to/model.onnx")
# util.invoke_if_callable(self.path) -> "/path/to/model.onnx"

# 场景2：动态路径生成
def get_model_path():
    return f"/models/{datetime.now().strftime('%Y%m%d')}/model.onnx"

loader = NetworkFromOnnxPath(get_model_path)  # 传入函数而非字符串
# util.invoke_if_callable(self.path) -> 调用get_model_path()获取实际路径

# 场景3：嵌套懒加载器
path_loader = SomeCustomPathLoader()
loader = NetworkFromOnnxPath(path_loader)  # 传入另一个懒加载器
# util.invoke_if_callable(self.path) -> 调用path_loader()获取路径
```

## 懒加载的执行时序

### 创建阶段（微秒级）
```python
import time

start = time.time()
loader = NetworkFromOnnxPath("large_model.onnx")
creation_time = time.time() - start
print(f"创建时间：{creation_time*1000:.2f} 毫秒")  # 通常 < 1 毫秒

# 内存使用：< 1KB（只存储路径和配置）
# CPU使用：几乎为0
# GPU使用：0
# I/O操作：0
```

### 执行阶段（秒级）
```python
start = time.time()
builder, network, parser = loader()  # 现在才执行实际工作
execution_time = time.time() - start  
print(f"执行时间：{execution_time:.2f} 秒")  # 可能需要几秒到几分钟

# 内存使用：可能 > 100MB（包含完整的TensorRT对象）
# CPU使用：解析和转换过程中较高
# GPU使用：分配相关资源
# I/O操作：读取ONNX文件
```

## 懒加载的高级特性

### 1. 链式懒加载

```python
# 可以串联多个懒加载器而不执行任何工作
network_loader = NetworkFromOnnxPath("model.onnx")      # 懒加载器1
config_loader = CreateConfig(fp16=True, int8=True)      # 懒加载器2  
engine_loader = EngineFromNetwork(network_loader, config_loader)  # 懒加载器3

# 此时内存使用 < 10KB，没有任何实际工作被执行

# 执行时会按顺序调用整个链条：
engine = engine_loader()
# 等价于：
# 1. network = network_loader()    # 解析ONNX
# 2. config = config_loader()      # 创建配置  
# 3. engine = build_engine(network, config)  # 构建引擎
```

### 2. 对象所有权的智能管理

#### 模式1：传入懒加载器（推荐）
```python
# 外部加载器获得执行控制权
network_loader = NetworkFromOnnxPath("model.onnx")
engine_loader = EngineFromNetwork(network_loader)

# 优点：
# - 自动生命周期管理
# - 延迟执行到真正需要时
# - 内存使用优化
engine = engine_loader()  # engine_loader控制何时调用network_loader
```

#### 模式2：传入实际对象（高级用法）
```python
# 立即执行获取实际对象，用户保持控制权
builder, network, parser = network_from_onnx_path("model.onnx")  # 立即执行
engine_loader = EngineFromNetwork((builder, network, parser))    # 传入实际对象

# 优点：
# - 用户完全控制对象生命周期
# - 可以在传递前修改对象
# - 适合复杂的自定义处理

# 缺点：
# - 失去延迟执行的优势
# - 需要手动管理内存
engine = engine_loader()
```

### 3. 条件执行和资源优化

```python
# 场景：批量处理，但只处理满足条件的模型
models = [
    NetworkFromOnnxPath("model1.onnx"),  # 创建：微秒级
    NetworkFromOnnxPath("model2.onnx"),  
    NetworkFromOnnxPath("model3.onnx"),
    # ... 可能有数百个模型
]

# 只有需要时才执行，避免不必要的资源消耗
for i, model_loader in enumerate(models):
    if should_process_model(i):  # 某种业务逻辑
        try:
            builder, network, parser = model_loader()  # 现在才加载这个模型
            # 处理模型...
        except Exception as e:
            print(f"模型 {i} 加载失败：{e}")
            continue  # 跳过这个模型，不影响其他模型
    # 不满足条件的模型从未被加载，节省资源
```

## 懒加载与立即执行的对比

### 资源使用对比

| 特性 | 懒加载模式 | 立即执行模式 |
|------|-----------|------------|
| **内存峰值** | 按需分配，可控制 | 立即分配，可能浪费 |
| **启动时间** | 极快（微秒级） | 较慢（秒级） |
| **错误发现** | 执行时发现 | 创建时发现 |
| **调试难度** | 中等（需要理解延迟执行） | 简单（直观） |
| **并发友好性** | 高（轻量级对象易复制） | 低（重对象难复制） |
| **资源清理** | 框架管理 | 用户管理 |

### 适用场景对比

#### 懒加载适用场景：
- ✅ **条件执行**：只有满足某些条件时才需要执行
- ✅ **批量处理**：需要创建很多加载器但不是全部都会用到
- ✅ **管道构建**：需要构建复杂的处理链条
- ✅ **多进程/多线程**：需要在不同进程间传递处理逻辑
- ✅ **资源受限**：内存或计算资源有限
- ✅ **配置复杂**：需要根据运行时条件调整处理参数

#### 立即执行适用场景：
- ✅ **简单脚本**：一次性处理，逻辑简单直观
- ✅ **调试代码**：需要立即看到错误和结果
- ✅ **交互式开发**：在Jupyter notebook中逐步执行
- ✅ **直接操作对象**：需要直接调用TensorRT原生API
- ✅ **自定义生命周期**：需要精确控制对象的创建和销毁时机

## 最佳实践和常见陷阱

### ✅ 最佳实践

#### 1. 合理选择API模式
```python
# 简单场景：使用立即执行函数式API
builder, network, parser = network_from_onnx_path("model.onnx")
engine = engine_from_network((builder, network, parser))

# 复杂管道：使用懒加载类式API
engine_loader = EngineFromNetwork(
    NetworkFromOnnxPath("model.onnx"),
    CreateConfig(fp16=True)
)
with TrtRunner(engine_loader) as runner:
    outputs = runner.infer(inputs)
```

#### 2. 合理的错误处理
```python
# 推荐：在执行阶段处理错误
loader = NetworkFromOnnxPath("model.onnx")
try:
    builder, network, parser = loader()
except Exception as e:
    print(f"模型加载失败：{e}")
    # 处理错误...
```

#### 3. 资源清理
```python
# 推荐：使用上下文管理器自动清理
with TrtRunner(EngineFromNetwork(NetworkFromOnnxPath("model.onnx"))) as runner:
    outputs = runner.infer(inputs)
# 资源自动清理
```

### ❌ 常见陷阱

#### 1. 对象所有权混淆
```python
# 危险：混合使用可能导致内存泄漏
def create_problematic_loader():
    builder, network, parser = network_from_onnx_path("model.onnx")  # 立即执行
    return EngineFromNetwork(NetworkFromOnnxPath("other_model.onnx"))  # 懒加载
    # builder, network, parser 可能不会被正确清理！

# 安全：保持一致的模式
def create_safe_loader():
    return EngineFromNetwork(NetworkFromOnnxPath("model.onnx"))  # 全部懒加载
```

#### 2. 重复执行开销
```python
# 低效：每次都重新执行
loader = NetworkFromOnnxPath("large_model.onnx")
for i in range(10):
    builder, network, parser = loader()  # 每次都重新解析！

# 高效：执行一次，重复使用
builder, network, parser = network_from_onnx_path("large_model.onnx")
for i in range(10):
    # 使用已解析的对象
    process_network(network)
```

#### 3. 错误发现延迟
```python
# 可能的问题：错误路径直到执行时才被发现
loaders = []
for path in model_paths:
    loaders.append(NetworkFromOnnxPath(path))  # 即使路径错误也不会报错

# 建议：如果需要早期验证，可以添加检查
for path in model_paths:
    if not os.path.exists(path):
        raise FileNotFoundError(f"模型文件不存在：{path}")
    loaders.append(NetworkFromOnnxPath(path))
```

## 总结

Polygraphy的懒加载机制通过**函数对象模式**实现了高效的资源管理和灵活的执行控制。理解懒加载的原理有助于：

1. **选择合适的API**：根据使用场景选择懒加载类式API或立即执行函数式API
2. **优化性能**：避免不必要的资源消耗和计算开销
3. **构建复杂管道**：利用链式懒加载构建可重用的处理流程
4. **避免常见陷阱**：正确管理对象生命周期和错误处理

掌握懒加载机制是深入使用Polygraphy的关键，它体现了现代深度学习框架在性能优化和资源管理方面的最佳实践。
